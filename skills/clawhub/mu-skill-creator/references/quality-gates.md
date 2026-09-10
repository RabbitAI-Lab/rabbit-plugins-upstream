# Quality Gates 质量门控完整指南

> 本文件是 mu-skill-creator 的 L3 参考文档，SKILL.md 索引指向此处。

---

## 一、AP 反模式完整说明（AP-1~36）

### AP-1：SKILL.md > 500 行
**症状**：SKILL.md 包含大量示例代码、完整 schema、详细说明
**后果**：每次激活消耗大量 token，上下文污染
**修复**：行数以效果为第一原则，不是为了数字好看而拆分。先判断"把这部分移到 references/ 后，Agent 要不要多一次 read 才能执行完该步骤、执行时会不会因为跳转而遗漏关键约束"——拆完仍能一次完整执行、不降级，才做这次拆分；如果某段内容和上下文强耦合（比如判断逻辑依赖前后紧邻的另一条规则），拆开反而会造成执行时脱节，此时应保留在 SKILL.md 内，宁可行数超标也不做这次拆分。拆分的判断标准是"效果是否不减"，不是"行数是否达标"。

### AP-2：description 写工作流
**症状**：description 里出现"当用户需要…时，先做A，再做B，最后做C"
**后果**：description 过长导致 agent 触发混乱，也降低可读性
**修复**：description 只写"做什么 + 触发词 + 不适用"，工作流放 SKILL.md

### AP-3：阶段没有编号/出口条件
**症状**：阶段标题有了，但没有明确"做完了是什么样"
**后果**：agent 不知道何时推进到下一阶段，容易死循环或跳步
**修复**：每个阶段加 `出口条件：xxx`，用可验证的描述

### AP-4：引用链多跳（A→B→C）
**症状**：SKILL.md 引用 references/guide.md，guide.md 再引用 detail.md
**后果**：agent 需要多次 read 才能获取信息，效率低下
**修复**：所有引用从 SKILL.md 出发，只允许一跳到 references/

### AP-5：没有完成门控
**症状**：执行完了，但没有验证步骤
**后果**：agent 自述"完成了"但实际未完成，问题无法发现
**修复**：每个关键阶段加验证步骤（运行命令，检查输出）

### AP-6：不可验证指令
**症状**：指令里有"高质量"、"合理"、"友好"等主观描述
**后果**：agent 无法判断是否满足要求，导致输出不一致
**修复**：所有指令改为可 yes/no 判断的客观标准

### AP-7：无 Confirmation Gate
**症状**：会修改文件/发消息/部署的 Skill，没有在实施前让用户确认
**后果**：误操作风险高，不可逆
**修复**：在改动步骤前加确认环节，明确列出将要做的操作

### AP-8：无 Pre-Delivery Checklist
**症状**：执行完了直接输出，没有最终检查
**后果**：遗漏细节，输出质量参差不齐
**修复**：在最终输出前加可打勾的检查清单

### AP-9：无 IRON LAW
**症状**：SKILL.md 顶部没有防抄近路的铁律
**后果**：agent 在"我觉得没问题"时跳过关键步骤
**修复**：frontmatter 之后第一行写 IRON LAW，加粗，醒目

### AP-10：无 Anti-Pattern 列表
**症状**：只告诉 agent 该做什么，没有告诉不该做什么
**后果**：agent 会用默认行为填补空白，而默认行为往往不符合期望
**修复**：显式列出 5-10 条禁止行为

### AP-11：无子Agent执行规范
**症状**：Skill 可能被子Agent执行，但 SKILL.md 中没有子Agent最小执行规范段落
**后果**：子Agent不知道哪些步骤不可跳过，默认行为填充导致关键步骤遗漏
**修复**：加 ≤ 30 行最小执行规范（必读文件/硬 Gate/禁止行为）

### AP-12：循环无终止条件
**症状**：循环逻辑没有 max 次数或超时退出条件
**后果**：Agent 可能无限重试，占用大量 token/时间
**修复**：循环内加 max 次数或超时退出逻辑

### AP-13：无数据量限制
**症状**：批量操作/输出没有 limit/截断/分页上限
**后果**：数据量大时输出内容截断或 token 爆表
**修复**：加明确的 limit 数字和分页逻辑

### AP-14：冗余重复提示
**症状**：同一条指令在 SKILL.md 不同位置重复出现
**后果**：占用行数，迭代时只改了一处导致不一致
**修复**：同一指令只写一处，其余地方用引用

### AP-15：大文件无截断
**症状**：读取或输出大文件时没有字数/行数上限
**后果**：超出 context 窗口导致内容被截断且无感知
**修复**：明确加字数/行数上限，超出时分页续读

### AP-16：SKILL.md 保留 intro 字段
**症状**：frontmatter 里写了 `intro:` 字段
**后果**：intro 内容会随 Skill 加载进入 context，同时 Skill 市场管理更难
**修复**：intro 只由平台 CLI 单独管理，SKILL.md 不保留

### AP-17：Shell 无 shebang/set -euo
**症状**：脚本第一行不是 shebang，或缺少 `set -euo pipefail`
**后果**：脚本执行失败时静默继续，错误难以定位
**修复**：第一行加 `#!/usr/bin/env bash`，第二行加 `set -euo pipefail`

### AP-18：重复造轮子
**症状**：多个 Skill 各自实现相同的功能脚本
**后果**：维护成本翻倍，修一处忘修其他
**修复**：抽取到 scripts/ 共用，其他 Skill 引用

### AP-19：规则只有 MUST 没 WHY
**症状**：规则只写 MUST/NEVER/ALWAYS，没有解释原因
**后果**：Agent 理解意图比死记规则更有效，缺少 WHY 导致规则被忽略
**修复**：重要规则底部附一句 WHY

### AP-20：IRON LAW 照据通用模板
**症状**：IRON LAW 内容是通用套话（行数/shebang/硬编码等），没有该 Skill 的业务专属约束
**后果**：IRON LAW 占了行数但激活不了任何防护，形同虚设
**修复**：IRON LAW 必须包含该 Skill 频率最高的违规模式和业务专属约束

### AP-21：frontmatter/metadata 含真实内部账号发布
**症状**：frontmatter 中保留内部平台元数据字段（如 creator/updater/skill_id 等）
**后果**：公开 Skill 发布后任何人均可看到发布者真实内部账号，造成个人信息暴露
**检查**：`grep -n 'skillhub\.' SKILL.md`（检测任何内部平台元数据残留）
**修复**：删除整个 metadata 块；发布者信息由 Skill 市场系统自动记录，无需手动维护

### AP-22：_meta.json 含真实凭据未排除
**症状**：Skill 目录下存在 `_meta.json`，其中含真实平台密钥或作者内部账号，且没有 .skillignore 排除
**后果**：打包发布时 _meta.json 随 zip 上传，下载者可获取发布者真实凭据
**检查**：`test -f _meta.json && cat _meta.json | grep -E 'key|secret|author'`
**修复**：在 .skillignore 中加入 `_meta.json`；frontmatter 只写占位符，禁止写入真实凭据

### AP-23：eval/exec 执行用户输入
**症状**：脚本中使用 `eval()` 或 `exec()` 处理用户输入或外部数据
**后果**：代码注入风险，攻击者可执行任意代码
**检查**：`grep -rn 'eval(\|exec(' scripts/ --include='*.py'`
**修复**：用 AST 白名单安全评估器替代（`ast.parse` + 递归节点校验），仅允许字面量和运算符节点
**根因事故**：mu-excel-toolbox validate.py 用 eval() 执行用户传入的校验表达式

### AP-24：异常捕获过宽
**症状**：`except:` 裸捕获或 `except Exception as e:` 捕获过宽异常
**后果**：吞掉非预期错误（如 KeyboardInterrupt、SystemExit），问题被隐藏而非暴露
**检查**：`grep -rn 'except:\|except Exception' scripts/ --include='*.py'`
**修复**：缩窄 except 到具体异常类型（如 `except UnicodeDecodeError`）；确需宽捕获时至少 re-raise 或 log
**根因事故**：mu-excel-toolbox peek.py 用 `except (UnicodeDecodeError, Exception)` 吞掉所有异常

### AP-25：调试残留
**症状**：代码中残留 `if False:`、`import pdb`、`breakpoint()`、`print(调试` 等调试代码
**后果**：死代码占空间，print 污染输出，pdb 可能在生产环境阻塞
**检查**：`grep -rn 'if False\|import pdb\|breakpoint()\|print(.*debug' scripts/ --include='*.py'`
**修复**：删除所有调试残留；需要保留的调试代码用 `if DEBUG:` 环境变量门控
**根因事故**：mu-excel-toolbox dedup.py 残留 `if False:` 调试分支和未使用变量

### AP-26：废弃 API 调用
**症状**：调用了已标记 deprecated 的库 API
**后果**：未来版本升级后代码报错；部分废弃 API 已知有 bug 不会被修复
**检查**：查看库文档的 deprecation warning，或运行 `python -W all script.py` 检查警告
**修复**：替换为文档推荐的新 API
**根因事故**：mu-excel-toolbox clean.py 使用 pandas 已废弃的 `infer_datetime_format=True` 参数

### AP-27：API 契约不一致
**症状**：函数/方法的调用方传参与定义方签名不匹配（如漏括号、多余 kwargs）
**后果**：运行时 TypeError 或静默返回错误结果
**检查**：`grep -rn 'has_errors\|has_warnings' scripts/ --include='*.py'` 检查方法调用是否带括号；对比函数定义与调用
**修复**：修正调用方签名，确保参数名和数量匹配定义方
**根因事故**：mu-excel-toolbox chart.py/pivot.py 调用 `has_errors` 漏括号（属性访问 vs 方法调用）；formula.py 传无效 kwargs

### AP-28：import 与 requirements 不匹配
**症状**：脚本中 `import` 了第三方库，但 requirements.txt 中未声明；或反之
**后果**：新环境安装后运行报 ImportError；或安装了无用依赖增加体积
**检查**：提取脚本中的 import 语句，与 requirements.txt 交叉比对
**修复**：同步 requirements.txt，确保所有第三方依赖均已声明且版本固定
**根因事故**：mu-excel-toolbox convert.py 使用 tabulate 但 requirements.txt 未声明

### AP-29：可选依赖无 fallback
**症状**：使用了非核心依赖（如 `df.to_markdown()` 依赖 tabulate），但没有 try/except ImportError 处理
**后果**：用户未安装可选依赖时整个脚本崩溃，而非降级运行
**检查**：对非核心 import 检查是否有 `try: import xxx except ImportError` 包裹
**修复**：用 try/except ImportError 包裹可选依赖 import，提供降级方案（如回退到 to_string）
**根因事故**：mu-excel-toolbox convert.py/utils.py 的 markdown 格式输出无降级处理

### AP-30：路径操作字符串替换
**症状**：用 `filename.replace('.xlsx', '_chart.xlsx')` 等字符串替换操作处理文件路径
**后果**：文件名含多个 `.xlsx` 时误切；跨平台路径分隔符不一致
**检查**：`grep -rn "\.replace('\..*','" scripts/ --include='*.py'`
**修复**：使用 `os.path.splitext()` 分离扩展名，再拼接新后缀
**根因事故**：mu-excel-toolbox chart.py 用 `.replace('.xlsx', '_chart.xlsx')` 生成输出文件名

### AP-31：资源遍历无上限
**症状**：遍历大文件/大数据集的循环没有行数/条数上限
**后果**：遇到百万行数据时遍历超时或内存溢出
**检查**：审查 `for` 循环遍历 DataFrame/文件的代码段，检查是否有 `[:limit]` 或 `break` 条件
**修复**：加采样上限（如 `col[:101]` 只取前100行计算），或加分页/分块逻辑
**根因事故**：mu-excel-toolbox style.py 自动列宽遍历全部行（百万行时超时）

### AP-32：.gitignore 缺失
**症状**：Skill 含 scripts/ 目录但无 .gitignore 文件
**后果**：`__pycache__/`、`.pyc`、`.DS_Store` 等产物随发布上传，污染下载者环境
**检查**：`test -d scripts/ && test -f .gitignore || echo 'MISSING'`
**修复**：创建 .gitignore，至少排除 `__pycache__/`、`*.pyc`、`.DS_Store`、`Thumbs.db`
**根因事故**：mu-excel-toolbox 发布前无 .gitignore，__pycache__ 随包上传

### AP-33：SKILL.md 保留版本历史
**症状**：SKILL.md 正文里逐版罗列"v12.6 改了 X、v12.5 改了 Y"的变更历史
**后果**：版本历史是溯源信息，不参与任何生成/路由/决策，占用 L2 主文件行数=纯浪费注意力预算，把有效指令挤出 context
**检查**：`grep -nE '^#+.*(版本历史|更新记录|CHANGELOG|v[0-9]+\.[0-9]+)' SKILL.md`——正文出现多条版本条目即命中
**修复**：SKILL.md 只留 1 行当前版本号 + `完整历史见 references/CHANGELOG.md` 链接，历史详情全部迁到 references/CHANGELOG.md
**根因事故**：mu-visual-card v12.6 版本历史占 35 行（占 615 行中的 5.7%），迁移后省至 1 行

### AP-34：Gotchas/踩坑记录堆积膨胀
**症状**：Gotchas 段从"反直觉事实速查"退化成"逐条事故日志"——每条都是完整的现象→根因→修复叙述，条目数和行数失控，把整个 SKILL.md 撑肥
**后果**：它是 AP-33 的同构兄弟——都把"溯源/调试类信息"堆进 L2 主文件，占注意力预算却不参与生成/路由/决策。Agent 每次激活都要把大段事故史读进 context，它真正需要的是"该怎么做"的结论，不是"当初为什么错"的考古
**检查**：`bash scripts/skill-audit.sh <skill>` 的 GOTCHA 列——踩坑段 `###` 条目 >10 条 或 占全文行数 >40% 即告警（与 L1-5 同为信息告警不直接判红，评估后确可保留则标注通过）
**修复**（分层处置决策树，判据=常规执行时需读它吗）：
1. **删除**——结论已被 IRON LAW 或工作流步骤覆盖 → 直接删（重复留存 = AP-14 冗余）
2. **上浮固化**——是"该怎么做"的操作结论（字段规范/命名规则）→ 提炼一句进对应阶段步骤，删掉事故叙述
3. **下沉**——是"某模板/某环境的实现坑"（CSS/超时/DOM 顺序）→ 移到 references/troubleshooting.md，主文件只留"症状→查阅条目"索引表
**根因事故**：mu-redskill-intro v5.5，27 条 Gotchas 占 389 行/全文 66%，主文件 593 行；重构后主文件降至 234 行、Gotchas 缩为索引表

### AP-35：事故仅记录未闭环（ICE-5）
**症状**：发生事故后只在 references/Gotchas 中记录现象和根因，但未将修复落点进入工作流步骤、自动校验脚本或已有 checklist。ICE-5 五字段（触发步骤/强制点/失败行为/运行证据/失败后动作）未全部覆盖
**后果**：事故因仅记录未工程化而复发；记录≠修复，没有强制执行入口的修复等于没有修复
**检查**：`grep -ciE 'ICE:\s*required|incident-closure:\s*required' SKILL.md` — 标记后检查 scripts/ 下是否有 closure_check.* 或等价质量门脚本；审计仅做静态检查（存在性+shebang），执行验证由用户手动运行该脚本
**修复**：必须将默认动作进工作流、自动校验进入脚本或已有 checklist、失败即停成为出口条件、证据进入审计输出。根因/对应原则写抽象描述。定性/知识引导类 Skill 默认豁免。满足任一条件才强制 ICE-5：同类失败第二次、首次造成对外交付/发布事故、不可逆或外部依赖存在静默降级风险、伪成功（文件齐全但内容假）
**根因事故**：事故复发因仅记录未工程化——记录本身不算修复
**对应原则**：§4 防御 10（事故闭环而非仅记录）

### AP-36：附件文档职责重叠
**症状**：同一主题在 `templates/` 与 `references/` 中存在功能等价文件，或多个附件文件定义同一规则的不同版本，导致维护时只更新其中一份。
**后果**：Agent 无法判断哪个文件是当前权威来源，旧规则会继续参与执行并造成跨文件冲突。
**检查**：按主题对照 `templates/`、`references/` 与 SKILL.md 的引用；同一主题出现等价模板、规则或流程时，必须明确唯一 owner，其他文件只能保留索引或 `DEPRECATED` 标记。
**修复**：合并为唯一权威文件（通常位于 `references/`）；删除重复文件，或将非 owner 文件改为仅含“详见 <owner>”的索引。规则迭代后逐一核对附件是否同步。
**根因事故**：mu-wechat-typeset 的 `templates/` 下 3 个文件与 `references/skill-promo-template.md` 职责重叠，新增规则只更新后者，前者仍引用不存在的 CLI 参数。
**对应原则**：§3 决策1（三层模型）+ §1 规则冲突

### AP-37：已知局限膨胀/无降级路径
**症状**：已知局限条目只说"做不到"不给"怎么办"，或同一能力边界拆成多条场景变体，或将设计取舍/待办项当硬伤收入。三种表现形式：(1) 无降级路径——条目止步于"需人工复核""脚本无法检测"但不给出具体行动；(2) 同类膨胀——一个能力边界拆成多条不同场景：(3) 非硬伤混入——能通过改设计消除的"局限"被收入（如"状态外置非强制"可以通过改为强制来消除，不是硬伤）。
**后果**：已知局限从"用户遇到时的行动指南"退化成"免责声明堆砌"。条目膨胀挤占注意力预算（AP-33/34 的同构兄弟）。
**检查**：逐条审查已知局限段，对每条回答三个问题：(1) 读者看完知道遇到时该做什么吗？（合格=知道具体行动）(2) 是否有其他条目本质是同一能力边界？（应合并为一条）(3) 这条能通过改设计消除吗？（能→不是硬伤，删除或下沉到工作流步骤）。再用三维评价定优先级：①不可逆性(不可逆>可逆需成本>完全可逆) ②发生概率(每次必撞>特定条件>极端边缘) ③影响范围(核心安全门控>子路径流程>非关键质量)。入选Top3须在不可逆性或影响范围至少一个为高且发生概率≥中。条目超过3条需逐条审核。
**修复**：按三要素重写每条（`[P/D/E] 能力边界(≤30字)→触发条件(≤20字)→降级路径(替代方案/人工复核什么/上报人类)`），按三维评价定重要性降序排列，合并同类项至 ≤3 条。
- P类(Platform)：平台/API/外部工具能力边界
- D类(Design)：设计取舍导致的能力边界
- E类(Edge)：边缘输入/极端场景未覆盖
**根因事故**：mu-github-publisher v2.6，21条6756字，17条无降级路径，6条同一能力边界的变体，3条平台CLI限制可合并为1条→实际硬伤仅3条
**对应原则**：§4 防御9（已知局限只列硬伤）+ §1 失效3（规则膨胀）

---

### AP-38：AP描述膨胀（段落代替索引）
**症状**：AP 清单条目从表格中的一行索引退化成大段 blockquote 段落，包含完整的症状/后果/检查/修复细节/根因叙述。AP-33 管"版本历史不要堆主文件"，AP-34 管"Gotchas 不要堆主文件"，但 AP 描述自身如果也以完整段落形式写入主文件，就构成了与 AP-33/34 完全同构的问题：溯源/参考类信息占据主文件注意力预算，却不参与生成/路由/决策。
**后果**：AP 清单从"快速索引"退化成"百科全书"。大段段落使 Agent 难以快速扫描全部反模式，注意力被个别条目的长描述吸收，其余条目被忽略。讽刺的是，AP-33~37 在 mu-skill-creator v4.1 主文件中正是以大段 blockquote 形式存在——AP 自身违反了 AP-33/34 的精神。
**检查**：审查 SKILL.md 中的 AP 清单，每条是否为一行表格（反模式名 + 一句话修复 + 根因事故 + 对应原则）？有无条目使用了段落/blockquote 形式写完整描述？有无条目超过一行？
**修复**：所有 AP 条目统一用表格，每条一行：`| 编号 | 反模式名(≤15字) | 一句话修复(≤20字) | 根因事故(≤15字) | 对应原则 |`。完整描述（症状/后果/检查/修复细节/根因叙述）只留 references/quality-gates.md，主文件表格上方保留"完整说明见 references/quality-gates.md"索引。
**根因事故**：mu-skill-creator v4.1，AP-33~37 在主文件中以大段 blockquote 写入（AP-33 占2行、AP-34 占6行、AP-35 占3行、AP-36 占4行、AP-37 占5行），共21行可压缩为6行表格。
**对应原则**：§3 决策1（三层模型控制 context 膨胀）+ §1 失效3（规则膨胀）

---

### L4-4：数值一致性（同一语义量的所有引用点数值不统一）
**症状**：同一个参数（viewBox 尺寸、字号、坐标、色值、间距、百分比阈值等）在不同引用点取值不一致。引用点不仅包括跨文件（SKILL.md vs references/ vs assets/ vs test-output），也包括**同一文件内不同章节**（如 taste.md 的检查清单写 75%，同一文件的硬约束写 85%——版本迭代改了硬约束但漏改检查清单）
**后果**：LLM 按文档生成时使用文档值，但参考实现用的是另一套值，导致渲染结果与预期不符；同文件内新旧数值并存时 LLM 无法判断哪个是当前有效值
**检查**：提取所有文件中的硬编码数值（viewBox、font-size、x/y 坐标、色值 hex、间距 px、面积/比例百分比），按语义分组（如"充实度"相关的所有百分比），验证同组内所有引用点数值一致。特别注意：版本迭代后旧章节数值是否已同步更新
**修复**：以最新版本的规则为基准，统一所有引用点中的数值；数值变更时全文 grep 同步更新所有出处（含同文件不同章节）
**根因事故**：① mu-visual-card 的 viewBox 在 SKILL.md 写 `0 0 940 760`，metaphor-blueprints.md 通用规范也写 `940 760`，但 9 个隐喻示例 SVG 全用 `0 0 980 700`——三处来源互相矛盾。② mu-visual-card v11.3 审计发现 taste.md 布局检查清单仍写"图形不超过 75%"（v6.0 旧值），但同文件硬约束第 8 条已改为"不超过 85%"（v11.3 新值）——同文件内版本迭代残留

### L5-3：参考实现正确性（示例代码/模板/SVG 语法错误）
**症状**：SKILL.md 引用的参考实现文件（示例 SVG、模板 HTML、参考脚本等）存在语法错误、属性名写错、或与文档描述的规范不一致
**后果**：LLM 学习错误的参考实现并复制到所有后续生成中；用户按参考实现修改时引入 bug；参考实现的错误被当作"标准"传播
**检查**：对 SKILL.md 引用的所有参考文件（如 `参考 test-output/xxx.svg`、`参考 references/xxx.md 中的示例`）做语法校验：SVG 属性名是否正确（cx/cy 而非 x/y for circle）、HTML 是否合法、Python 是否可执行、数值是否符合文档声明的规范
**修复**：修正参考实现中的语法错误；如参考实现与文档规范不一致，以哪边为准需明确决定后同步另一边
**根因事故**：mu-visual-card 的 card001_fullpage.svg 被标注为"参考实现"，其中 `<circle cx="1045" y="25">` 使用了错误的 `y` 属性（circle 元素应为 `cy`），该错误会被 LLM 学习并复制

### L10-6：边缘输入覆盖（边界条件无处理指引）
**症状**：Skill 假设输入总是"正常"的（中等长度、预期语言、完整格式），没有对极端或非预期输入给出处理指引或在已知局限中声明
**后果**：用户提供极短文本（<200 字，只能拆出 1 个观点）、极长文本（>50000 字）、空输入、非预期语言（如中文 Skill 收到纯英文）、格式错误（如期望 JSON 收到纯文本）时，Agent 无规则可依，要么静默产出低质量结果，要么卡住不知所措
**检查**：列出 Skill 的核心输入，对每种输入回答以下 5 个边界问题——极短时怎么办？极长时怎么办？为空时怎么办？语言/格式不符时怎么办？只有 1 条时结构怎么处理？若 5 个问题中有任一个在 SKILL.md 和已知局限中均无提及，此项不通过
**修复**：在工作流中加入边界门禁（如"输入 <200 字 → 仍生成完整卡包"），或在已知局限中显式声明不支持的边界场景
**根因事故**：mu-visual-card v11.3 审计发现极短原文（<200 字，只能拆出 1 个观点）和纯英文原文两个场景在 SKILL.md 中完全没有处理指引——目录页只有 1 条时会非常空，纯英文时中文排版规则（孤字防护等）不适用

---

## 二、Eval 测试框架

### 目的
通过 with/without skill 对比，量化 Skill 的实际效果。accuracy ≥85% 才算通过。

### evals/evals.json 格式
```json
[
  {
    "id": "eval-001",
    "prompt": "帮我创建一个新 Skill，用于搜索公司内部文档",
    "expected_behaviors": [
      "包含 IRON LAW",
      "description 单行无 emoji",
      "有触发词和不适用场景",
      "tags ≥ 6 个"
    ],
    "grading_criteria": "检查输出的 SKILL.md 是否满足所有 expected_behaviors"
  }
]
```

### 执行流程
```
1. 写 2-3 个真实 prompt（来自实际用户请求）
2. Spawn with-skill subagent（加载 mu-skill-creator）
3. Spawn without-skill subagent（不加载，用默认行为）
4. 每个 subagent 写 grading.json + timing.json
5. 父 session 读取两组结果，计算 accuracy
6. accuracy = (with-skill 满足的行为数) / (总行为数)
```

### 并发约束
- 每个 subagent 加 `cleanup=delete`
- 最多同时 4 个并发 subagent
- subagent 超时 10 分钟视为失败

### grading.json 格式
```json
{
  "eval_id": "eval-001",
  "with_skill": {
    "passed": ["包含 IRON LAW", "description 单行无 emoji"],
    "failed": [],
    "score": 1.0
  },
  "without_skill": {
    "passed": [],
    "failed": ["包含 IRON LAW", "description 单行无 emoji"],
    "score": 0.0
  }
}
```

---

## 三、触发词优化完整指南

### Gate 3 禁止词（硬阻断，不得出现在触发词中）

| 禁止词 | 原因 |
|--------|------|
| `以下内容` | 无意义描述，不是触发词 |
| `analyzer` | 英文通用词，触发范围过宽 |
| `helper` | 英文通用词，触发范围过宽 |
| `tools` | 英文通用词，触发范围过宽 |
| `assistant` | 英文通用词，触发范围过宽 |
| 单独 `skill` | 太宽泛，几乎所有请求都匹配 |
| 短动词（做/写/搜索） | 太通用，覆盖所有场景 |
| <2 字触发词 | 太短，误触率高 |

### 触发词测试模板

**10 个 should-trigger（必须触发此 Skill）：**
```
1. "帮我创建一个新的 skill"
2. "我想写一个 skill，用于处理XXX"
3. "优化一下这个 skill 的触发词"
4. "新 skill 怎么做"
5. "skill 开发规范是什么"
6. "帮我从头写一个 skill"
7. "skill 创作流程"
8. "想做一个新功能的 skill"
9. "skill 写完怎么发布"
10. "这个 skill 怎么优化"
```

**10 个 should-NOT-trigger（不得触发此 Skill）：**
```
1. "帮我写一段 Python 代码"
2. "修复这个 bug"
3. "帮我开发一个 Web 应用"
4. "搭建一个后端服务"
5. "写一个单元测试"
6. "重构这个函数"
7. "帮我设计数据库表结构"
8. "生成一份技术文档"
9. "翻译这段英文"
10. "帮我做一个 PPT"
```

### 准确率计算
```
accuracy = (should-trigger 正确触发数 + should-NOT-trigger 正确不触发数) / 20
```
目标：accuracy ≥ 85%（即 17/20 以上）

---

## 四、可验证性审查（主观→可验证转换示例）

### 转换原则
所有指令必须能用 yes/no 判断，而不是需要主观评估。

### 转换示例

| ❌ 主观（不通过） | ✅ 可验证（通过） |
|---|---|
| "写高质量代码" | "lint 通过，无 error；函数覆盖率 ≥70%" |
| "合理组织代码结构" | "每函数 ≤50 行；模块职责单一" |
| "友好的错误提示" | "错误信息包含：原因描述 + 修复建议 + 错误码" |
| "全面测试" | "单测覆盖率 ≥80%；有正向+边界+异常三类用例" |
| "清晰的注释" | "每个公开函数有 docstring；复杂逻辑有行内注释" |
| "性能良好" | "P95 响应时间 ≤200ms；内存峰值 ≤512MB" |
| "安全的实现" | "无 SQL 注入；输入校验覆盖所有外部来源；无明文凭据" |
| "遵循最佳实践" | "通过 ESLint/Pylint 检查；无 console.log；无 TODO 遗留" |

### 审查步骤
1. 逐条扫描 SKILL.md 中所有指令
2. 对每条指令问："这个能用 yes/no 回答吗？"
3. 不能 → 按上表模式改写
4. 全部通过 → 可验证性审查完成
