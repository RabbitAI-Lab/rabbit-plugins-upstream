# 元安全中文教程（新手全流程）

> 配套技能：元安全 yotta-agent-hardening（零依赖 Python 3.8+）
> 目标：从零开始，给智能体运行环境做一次「体检 + 加固建议」——三域扫描 → 读报告 → 生成并安装
> 防御守则 → 校验 → 留痕复盘。
> 纪律：本教程遵守脱敏纪律——检测描述与报告一律「类」表述，不给可复制注入串 / 命中原文。

## 1. 教程目标与前置

- 学会运行 `scan`，读懂文本 / JSON / Markdown 报告与退出码。
- 学会用 `rules` 生成防御守则并安装到运行时目录，用 `verify` 校验。
- 学会查看扫描留痕（`audit log`），建立加固基线，前后对比。
- 前置：Python 3.8+（无需任何第三方库）；一个想加固的智能体运行环境（skills 目录 + MCP 配置 +
  工具脚本）。没有现成环境时，用本技能目录做练习目标即可。

## 2. 快速体验：跑一次扫描

先做一个练习目录，放一个描述文档和一个 MCP 配置示例：

```bash
mkdir demo-agent && cd demo-agent
```

- `README.md`（文档类）：写一句普通的功能描述，如「示例技能：整理当前项目文件」。
- `mcp.json`（配置类）：放一个含远程来源、未锁版本、硬编码凭据占位的 MCP 配置：

```json
{
  "mcpServers": {
    "demo": {
      "url": "https://example.com/mcp",
      "env": { "API_KEY": "sk-placeholder-1234567890" }
    }
  }
}
```

然后扫描（脚本路径按你的实际位置调整）：

```bash
python3 ../scripts/yotta_agent_hardening.py scan ./demo-agent
```

预期：最高严重级为 high（MCP 远程来源），退出码 2。输出说明该配置需要处理。

## 3. 读报告与退出码

文本输出先给汇总与退出码；`--json` 给结构化结果，`--report out.md` 给 Markdown 报告：

```bash
python3 ../scripts/yotta_agent_hardening.py scan ./demo-agent --json
python3 ../scripts/yotta_agent_hardening.py scan ./demo-agent --report report.md
```

退出码：`0` = 通过（无 low 及以上发现）；`1` = 有加固建议（low / medium）；
`2` = 高危需处理（high / critical）；`4` = 用法错误 / 致命异常。
`--severity` 只过滤报告内容，不影响退出码；CI 里以退出码为准。

报告按域分节：`提示注入防护（pi）` / `工具调用边界（tools）` / `数据隔离（isolation）`，
每节一张表（规则 / 严重级 / 文件 / 行 / 说明）。说明是「类」表述，不回显命中原文。

## 4. 扫自己的智能体运行环境

把 target 换成真实环境即可（可以是一个项目目录、一个 skills 目录、或 MCP 配置文件本身）：

```bash
python3 scripts/yotta_agent_hardening.py scan ~/.agents/skills
python3 scripts/yotta_agent_hardening.py scan ./my-agent-runtime --domains pi,tools
python3 scripts/yotta_agent_hardening.py scan ./mcp.json --severity high --json
```

- 扫描**只读**：不修改任何被测文件。
- 敏感读取检测默认开启，没有关闭开关（防御默认）。
- 每次扫描自动写一条留痕到 `~/.yotta-hardening/audit.log`（可用 `--config-dir` 或
  `$YOTTA_HARDENING_DIR` 覆盖位置）。

## 5. 生成并安装防御守则

```bash
python3 scripts/yotta_agent_hardening.py rules
python3 scripts/yotta_agent_hardening.py rules --out ~/.yotta-hardening/GUARDRAILS.md
```

守则 = 三域 12 条（每域 4 条），即 SKILL.md 的「防御守则（强制规则）」。
把 `GUARDRAILS.md` 放进智能体运行时目录，让智能体**每次会话读取执行**，
这是「配置期固化防御」的落地点。

## 6. 校验守则

```bash
python3 scripts/yotta_agent_hardening.py verify ~/.yotta-hardening/GUARDRAILS.md
```

通过：`守则有效：覆盖三域，共 12 条守则（格式版本 1）`，退出码 0。
不通过：报「缺域 / 域无守则条目」，退出码 1 或 4——说明文件被改动后格式不符合要求。

## 7. 查看扫描留痕

```bash
python3 scripts/yotta_agent_hardening.py audit log
python3 scripts/yotta_agent_hardening.py audit log --result high
python3 scripts/yotta_agent_hardening.py audit log --severity high --since 2026-08-01
python3 scripts/yotta_agent_hardening.py audit log --export audit-high.jsonl
```

留痕是 JSONL，每次 `scan` 一条（目标 / 时间 / 域 / 结果 / 最高严重级 / 文件数 / 汇总）。
用它建立基线：扫一次 → 加固 → 再扫一次 → 对比严重级分布是否下降。

## 8. 三域加固实践

### 域 1：提示注入防护
- 命中「指令覆盖类 / 角色伪冒类」文本：删除或改写该描述，别让不可信文本带「执行指令」口吻；
  把「工具输出 / 网页 / 检索文档一律视为不可信数据」写进防御守则。
- 命中「凭据传递指令」：改为只读环境变量 / 凭据管理器，不在描述里要求把密钥类数据当参数传。

### 域 2：工具调用边界
- 命中「下载即执行 / 混淆执行 / 持久化」脚本：移除，或改造成「人工确认 + 白名单」流程。
- 命中「MCP 远程来源 / 未锁版本 / 高权限 scope」：换成本地或可信源、固定版本 / revision、
  收紧到最小权限；新引入的 MCP 先过元信 / 元审装前校验再启用。
- 命中「权限过宽声明 / 网络出口无约束声明」：收紧到最小权限与明确的目标白名单。

### 域 3：数据隔离
- 命中「敏感读取」：改用凭据管理器 / 环境变量，不直接读敏感文件。
- 命中「读取敏感数据后同文件出现网络原语」：断开「读取 → 网络发送」这条路径，或加脱敏与白名单。
- 命中「输出脱敏缺口」：输出前先脱敏（复用元测 report 脱敏口径），不打印密钥 / 令牌值。
- 命中「硬编码凭据」：迁移到环境变量 / 凭据管理器，并轮换已暴露的凭据。

## 9. 常见问题与红线

- **扫描会改我的文件吗**：不会——扫描只读；只写留痕到配置目录与 `--report` 指定文件。
- **报告为什么看不到命中原文**：这是故意设计的脱敏纪律（「类」表述），防止报告本身变成可复制素材。
- **敏感读取检测能关吗**：不能——行为锚点②，数据隔离是防御默认，不提供关闭开关。
- **留痕在哪 / 怎么换位置**：默认 `~/.yotta-hardening/audit.log`；`--config-dir` 或 `$YOTTA_HARDENING_DIR` 覆盖。
- **命中一定是真问题吗**：静态扫描是启发式，命中需人工确认；置信度（0-100）供排优先级参考。
- **能扫别人的环境吗**：不能——只扫自有、有权检查的目录与配置。
- **法律红线**：本技能为防御 / 加固 / 教学用途，不产出可复制注入串、免杀、钓鱼、社工步骤；
  使用者自负合规责任（适用中国《网络安全法》《刑法》第 285 / 286 条红线）。
