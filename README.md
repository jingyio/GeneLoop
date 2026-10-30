# GeneLoop：Motif × DeepSeek Harness × 自定义 MCP

新增[RSI 共享质量证据与复用形式整合](docs/experiments/rsi-meta-overnight-20261030.md)：F02 统一记录任务/产物/评价标准和逐项证据，视频形式更新复用共同版本核验与发布回执。Python/TypeScript 都能核对新记录；视频帧/音频检查仍由场景提供。已完成一次真实发布、后继TS加载和下一学习/认证/反思；六对限定质量通过任务44→33请求、前向代理估费降约21%，后继两题仍有基线质量失败与候选重渲染开销，未证明持续净收益。完整证据与边界见实验记录，未部署正式服务。

新增[视频程序复用与复用形式RSI实验](scenarios/remotion_edit/structured/README.md)：从正常视频工具轨迹学习参数化TSX，并让目录/类型化工具、调用策略和下一轮编译方式进入可验证的外环。普通基线保留同样的源码写入与渲染融合能力；当前实现及实际效果边界见[实验记录](docs/experiments/remotion-program-rsi-20261030-v1.md)，尚未部署正式服务。
F02 审核候选提供一个免费可运行的经验执行协议演示：`npm run rsi:demo` 展示两个任务目标共享局部计数，以及版本/权限/证据失效时停止；`npm run rsi:check` 检查 Python/TypeScript 一致性。先看[通俗说明与接口](docs/rsi-protocol-v1.md)。当前使用人工算子与合成数据，不代表自动学习、完整任务或降本验收。

`npm run rsi:optimize` 补充“值得改哪里、怎样启动、改后是否接受”的免费决策演示；[十来行结果与接入说明](docs/rsi-optimization-v1.md)区分预计收益、配对结果和实际总支出。真实任务评审器与修改生成器仍待后续模块接入。

新增独立的 Artifact Motif 实验：从真实任务中学到可换输入的 Python 计算／排版程序，经独立输入认证后，通过原生 Bash 复用并保留逐次回执。它仍是显式启用的实验入口，不替换正式服务或默认库；费用下降与反例一起记录。见[接口与复现](docs/interfaces.md#artifact-motif-独立实验接口2026-10-21)和[三场景成本学习](docs/experiments/three-scene-motif-cost-learning-20261021.md)。

管理员可在“设置 → 账户与安全 → 邀请同学”批量生成 1–20 个邀请码（默认 5 个）。邀请码永久有效、每码注册一个账号后失效；支持逐个或全部复制，关闭页面不会使未用码失效。生成结果仅在当前页面显示，请离开前复制保存。

正式DeepSeek Web已移除账号级并发数量上限，费用、请求次数和应用输出额度均为null，原账本继续累计。普通Chat、三场景及File转发使用393216输出容量，File独立SDK继承同一策略。2026-10-21当前后端运行7e167ed（Paper31/PPT28/File15），已统一发布并完成新一轮五成员、本机网关783次真实请求复测。公网旧Quick Tunnel失效，候选隧道已由统一入口准备且浏览器登录页正常，原Worker更新仍需维护者登录Cloudflare；不能把本机压力结果称为公网恢复。质量反例、费用、测试判据缺陷与未接入能力均见[本轮记录](docs/experiments/dsh-native-capabilities-20261021.md)；早期额度修复见[历史记录](docs/experiments/provider-output-20261020.md)。


**开发者与 AI 先阅读 [AGENTS.md](AGENTS.md)。正式网站统一使用 `npm run service -- start` 启动，私有计划由 `GENELOOP_SERVICE_CONFIG` 指定；不得另写发布启动脚本。** 状态检查、重启、发布与回退见 [统一启动与发布流程](docs/service-lifecycle.md)。公网使用同一入口的 `public-check`、`public-prepare`、`public-confirm` 单独核验和恢复，后端正常时保留正在执行的任务。本地开发仍用 `npm run web`。

PPT 账户内结构学习现接入已启用PPT双路对照的真实聊天任务：后台从原始 Baseline 轨迹取两个独立训练任务和一个留出任务，经原编译器认证后，仅在后续任务试用；两个独立对照确实调用候选、交付检查通过且包含重试的费用下降，才自动保留。用户无需填写验收表，普通踩可停用候选。只学习已支持的来源固定→转换、转换→读取两条结构，不学习科研结论或任意生成代码；无明确人评时科研质量与人工时间仍未知。状态、证据和失败保留在账号私有目录；无合格候选回原库。该轮历史兼容库为 `ppt-master-v9` / `paper-web-v14`，生成技能仍为官方 ppt-master；当前版本以本页开头及本轮记录为准。部署条件、实现和真实验证边界见[接线记录](docs/experiments/ppt-user-learning-20261019.md)。

普通Chat、Paper/PPT/Data现接入DSH原生读写/读图/搜索文件、Web搜索与读取、Bash后台任务、任务清单、可信skill、用户提问/计划批准、同任务子Agent、显式有限Goal、上下文摘要与present交付。图片由模型按需调用read_image，源码与成品均须真实返回像素，不以文字描述冒充查看。File是独立文件管理SDK场景，使用27个文件MCP工具与todo_write；它的看页工具同样向模型返回图片，但工具表和执行上下文不同，不假称具备主聊天全部原生工具。原生Workflow的共享宿主执行、无Task归属的Files缓存接口、File逐字delta尚未开放，详见[能力与限制](docs/experiments/dsh-native-capabilities-20261021.md)。

独立 Script Motif 实验现支持当前语义选择、文件参数自动绑定与认证片段连续执行；复用原生 Bash，不增加模型工具表。真实任务已发生两节点自动接管，但三轮仍**未证明稳定净降本或合格交付**。最新对照发现不同报告路径及大量失败恢复，不能将费用差归为纯 Motif 开销。配置见 [接口](docs/interfaces.md#script-motif-实验接口)，结果和全部失败见 [实验记录](docs/experiments/paper-script-frontier-20261019-v1.md)。早期实验保留独立记录，本轮恢复验证与 PR 状态见文末。 新增从真实失败轨迹编译 Negative Motif 的实验入口，支持从已审阅校验器自动编译字段失败条件，按“当前失败提示 → 重算条件 → 仍失败则局部早停”执行；无关字段和版本变化不再自动放行。现支持循环/分支内多种错误的数据与控制依赖、双向原因干预，真实历史的重复 ID 和枚举错误已认证；其他类型仅有局部诊断，见 [原因学习记录](docs/experiments/paper-negative-causes-20261019-v1.md)。随后已完成原论文真实三组重测与历史恢复：完整任务均未合格，负面机制仅在恢复中实际提示一次、未触发硬早停，尚未证明合格净降本；详见 [真实重测](docs/experiments/paper-negative-real-20261019-v1.md)。 后续对448次真实请求的 [费用与接管障碍 Breakdown](docs/experiments/paper-takeover-breakdown-20261019-v1.md) 确认当前仅一个两节点片段、后续普通匹配未进入，报告语义数据与搜索内部模型也未被接管；本次重放不作为新增省费成绩。

独立论文实验新增从实际报告操作自动记录当前草稿、返回明确输入错误及有类型分组修复，不再要求runner预置恢复scope；真实局部恢复连续三次4请求，正常完整任务也触发了局部引用修订。完整费用仍受不同检索路径影响，科研事实验收未通过，不能宣称稳定整任务净降本。默认关闭、未部署；配置及全部失败见[自动状态接入记录](docs/experiments/paper-live-state-20261020-v1.md)。

独立 Script RSI 实验现将学习发布与下一任务加载接到同一私有 store，保存逐任务版本收据。真实 BibTeX 检查中，库从3算子增至12，后续三任务均实际接管一次，另观察到五次新学脚本缓存复用。首次失败、恢复和费用均保留，尚未证明整任务净降本或完整报告合格。见[自动闭环记录](docs/experiments/paper-rsi-live-loop-20261020-v1.md)，未部署生产。

首次在5篇独立论文的完整BibTeX文件子任务上已跑完20次真实配对：模型请求减少15.38%、输出Token减少18.89%，但冷输入增加使估费仅降1.20%，核心字段完全正确由9/10降到8/10。42次认证结构执行真实发生，仍未证明同质量稳定净降本；全部重复、失败、学习费用与归因见[五篇评测](docs/experiments/paper-multipaper-eval-20261021-v1.md)。这不是全文引用真实性或PDF报告验收，未部署。

修复选择传输后，原五篇各两次的[真实复测](docs/experiments/paper-multipaper-retest-20261021-v1.md)沿用已有Baseline：请求195→110、输出Token94785→52100、冷输入略降，核心9/10；4次任务实际接管21程序，仍有6次未选择复用及S4解析误报。已知用量估费USD0.1701，另保留两笔502的USD0.1075预约，最终净费下降尚未确认；全部失败与开发费用保留，未部署。

提示型Negative也已接入同一私有RSI流程：真实失败→编译→模型生成/独立审核→发布→后继任务加载并实际收到提示。最终连续两次局部真实检查通过；修复了新增Positive算子却缺少Embedding配置时连带停用Negative的问题。自动库只有提示权限，默认关闭；同论文恢复和投递检查尚未证明净降本。全部失败、两次局部worker恢复及USD0.5192保守估费见[负面闭环验收](docs/experiments/paper-negative-rsi-20261021-v1.md)。

同步新版DSH后，实验续接仅处理原生标记的Agent请求；提示规则可逐失败见证绑定精确的目标工具参数schema，新增无关工具不再使其失效。44工具环境下的局部真实检查已加载自动发布库并送达5次提示，未交付PDF或证明净降本；费用与取消记录见[兼容验证](docs/experiments/paper-rsi-main-compat-20261021-v1.md)。早停权限不变，未部署。

独立实验进一步支持默认关闭的Positive Motif描述学习：基于已认证代码与契约生成、独立审核并发布短描述，最终真实后继任务精确加载并执行；失败时保留适用的已审核描述，同证据不重复付费。脚本、契约和执行守卫保持不变。学习费用与更贵的运行全部计入，未证明该描述更新单独净降本，未部署；配置与限制见[描述更新实验](docs/experiments/paper-description-rsi-20261020-v1.md)。

后续[执行控制优化](docs/experiments/paper-frontier-batch-20261020-v1.md)保持原算子，支持一次当前语义选择后连续执行多个片段，真实接管3–8个程序且不再重复提交过期选择。观察到局部模型费下降和更贵反例，报告仍有数字/编码判断错误，不能视为完整论文合格降本；全部失败与费用保留，未PR或部署。

论文 Breakdown 的 [具体读写实例](docs/experiments/paper-operation-breakdown-20261019-v1.md) 现展示实际命令、工具参数、费用和复用边界。同一读取算子在另一真实多文件论文中，单主文件覆盖失败，绑定10个来源文件后覆盖一致；这仅为局部无模型检查，不是新端到端降费成绩。

PPT/PPTX 输入现结合原生主题/母版/布局、字体颜色和对象位置声明，以及隔离渲染的逐页视觉观察。GeneLoop 可用上传 PPT 作为设计参考；沿用原生模板填新内容时使用 ppt-master 的 round-trip 编辑流程，原件保留。旧 PPT 可隔离转换为标准 PPTX；字体、媒体和复杂效果仍有保真边界。见[附件说明](docs/attachment-input-behavior.md#pptpptx-的视觉与风格输入)。兼容库更新为 `ppt-master-v6` / `paper-web-v11`，沿用原证据与结构，旧库保留。

PDF 上传现已共用逐页文字读取、扫描页本地中英文 OCR、论文图片与矢量图的图文分析，适用于全部场景。图片分析使用 Flash，最终回复仍使用用户选择的模型；费用计入同一任务，原件、附件卡片和多轮继承保留。安装、覆盖与识别限制见[附件输入说明](docs/attachment-input-behavior.md)，真实五场景验收见[实验记录](docs/experiments/pdf-ocr-vision-20261018.md)。当前兼容库为 `ppt-master-v5` / `paper-web-v10`，原有结构和历史证据不变，旧库留存。

GeneLoop 网页的 Chat、`/ppt`、`/data`、`/paper` 和已登记 Files 场景共用联网搜索、网页读取、Bash/Python/Node 执行及后台任务。模型按需求调用工具，过程沿用原生流式事件。正式运行依赖 Linux `bubblewrap`；命令只接触本会话上传文件和工作目录，账号密钥不传入命令环境。当前服务器未安装 PowerShell。接口与隔离约定见 [网页通用能力](docs/interfaces.md#网页通用能力)。

真实 Web 的 Paper 完成普通任务后，会复用已保存的轨迹和 Python 编译器，在当前账号运行目录内自动编译、验证并发布下一版只读 Motif。至少需要两项不同的正常任务和一项固定留出任务；当前只支持文档固定版本后的第一页读取。下一任务冻结新版本，运行中和已确认任务保持原版；编译失败继续使用原库。编译不调用模型，不共享用户轨迹，不代表已证明净降本。入口与限制见 [Paper 自动学习接口](docs/interfaces.md#paper-自动学习接线)。

网页使用独立的 GeneLoop 视觉样式，统一明暗主题、侧栏、聊天、菜单、设置、账户页、双栏结果与轨迹。用户已选定 A 的清晰聊天排版与 C 的登录布局：登录页固定黑灰配色、原色螺旋动效和白底黑字按钮，工作区默认清晰风格；工作区的明暗及其他风格偏好不影响登录页。选择工作区方案时使用原生字号设置将阅读字号调整为 16px，之后仍可手动调整。减少动态偏好继续生效，单栏和双栏场景保持无框。样式范围、验证与仅回退代码的方法见 [视觉规范](docs/geneloop-visual-system.md)。已于北京时间 2026-10-17 20:56 随 `f8a04e4` 发布，保留同期回复缓冲修复；服务器旧源码差异的保留与整合见[核对记录](docs/experiments/geneloop-server-source-reconciliation-20261017.md)。

普通 Chat 现可直接打开 Bash/Python 生成的 HTML、SVG、Markdown 等交付文件，正文文件名和独立预览/下载入口共用本轮快照。文件保留私有权限；仅当前账号、本会话、本轮已核验的文件可读取，后续修改不覆盖旧交付。HTML 预览显示源代码，可下载后在浏览器运行。修复和兼容库 `paper-web-v13` / `ppt-master-v8` 的验证边界见[文件点击修复记录](docs/experiments/clickable-generated-files-20261019.md)。

交付文件卡片与已登记的正文文件链接点击后，在原生右侧标签页预览，独立下载图标才下载。支持 PDF、图片、Markdown、CSV/TSV、JSON 和文本；DOCX/PPTX/XLSX 提供内容预览，DOCX/PPTX 有同名配套 PDF 时优先预览排版。内容预览不保证原始图形、排版或公式；其他格式保留下载。读取沿用账号认证、文件大小与 SHA 校验，不向外部文档服务发送文件。当前实现与浏览器验收边界见[交付预览说明](docs/geneloop-visual-system.md#交付文件预览与三套候选风格2026-10-17)。

网页 `/ppt` 现使用完整、版本固定的 **ppt-master 6.6.0**。Baseline / Motif 使用同一技能、模型、工具和普通环境优化，由 GeneLoop 自主选路线、制作、检查、修复和导出；旧制作 MCP 不再暴露。安装与部署见 [PPT 场景](scenarios/ppt_master/README.md)，真实采集、被拒绝候选和网页对照见 [实验记录](docs/experiments/ppt-master-motif-20261018.md)。

新库 `ppt-master-v4`（v3 的来源继承兼容重编，原轨迹和结构不变）扩展到“固定模型选定 PDF → 官方转换”和“转换回执 → 核验并读取完整正文”两条结构续接，使用两项真实完整制作任务与独立留出任务编译。来源转换包装同样提供给 Baseline；只有在线实际跳过的模型请求才计作 Motif 收益。它不复用页面制作、科研判断或任意命令。来源、派生文件、权限、版本检查与取消继续生效；结构认证不代表成品合格或总费用下降。同模板网页对照见[新实验记录](docs/experiments/ppt-master-structure-style-20261018.md)。原 v1、`research-design-v3`、`host_delivery` 和历史检查保留；回退须连同匹配实现和证书恢复。

多轮附件会合并旧原件与新附件，切到 `/paper` 可继承同一对话的 DOCX；同名版本、排队气泡显示和视觉/OCR 边界见[附件说明](docs/attachment-input-behavior.md)。

文件管理入口为 **`/file 文件管理`**，与另外三个场景共用输入框、工作区、上传和交付预览/下载。任务副本内自动允许复制、移动、重命名和创建目录；覆盖、永久删除及工作区外访问单独确认。文件管理自动开启执行与持续 RSI，不增加开关；各账号使用独立的长期经验库，只安装脱敏且重新认证的公共种子。工具、读取覆盖、恢复与认证边界见[文件管理说明](docs/management-local.md)。

每轮输入默认 Chat，默认不显示场景、Origin 或 RSI 标签；本轮需要数据、PPT、论文或文件管理场景时重新输入 `/data`、`/ppt`、`/paper` 或 `/file`。输入栏标签直接订阅当前草稿，手写、粘贴和候选选中都会立即更新，删除后隐藏。斜杠菜单列出 `/file 文件管理`，不列出默认 Chat；加号菜单提供带图标的场景和“添加照片或文件”，沿用原生附件上传。菜单可直接替换已有场景标签，保留正文和附件。成功发送后下一轮自动恢复 Chat，已有任务、历史和交付保持；旧 Files 工作台对话也可在同一对话中继续 Chat。切换模型使用目标模型默认的 Off，原模型内调整思考强度仍按明确选择执行。

Chat 与场景对照共用实时状态文案：正在回复、思考、阅读文档、搜索资料或执行工具/命令；阅读状态可展示安全的文件名，不公开服务器路径或原始参数。运行期间底部显示 `GeneLooping…`，结束即消失。工作区行仅保留最右侧操作菜单，新聊天仍使用顶部“新会话”。

网页版移除 `export`、`feedback`、`harless`、`permission`、`model` 这五项指令及输入框权限选择器，保留场景入口。模型与思考强度调整后立即更新，后台按顺序保存；紧接着发送的消息等待该选择确认，失败恢复已生效选项并保留待发草稿。详见 [输入栏验收](docs/experiments/geneloop-instant-model-picker-20261015-v1.md)。

归档对话、最近删除和账户与安全统一放在设置右侧面板，分别使用归档盒、垃圾桶和账户安全线条图标。切换对话时只在聊天区域显示 GeneLoop 圆环，工作区侧栏保持可用；没有“显示已加载内容”按钮，进行中的回复继续实时输出。已归档对话可恢复到原工作区或移入最近删除；最近删除支持核对清单后永久清空，清空后无法从网页访问或恢复。清空属于持久访问撤销，服务器底层历史、文件及备份的保留策略不变，并非物理擦除。原设置验收见 [记录](docs/experiments/geneloop-settings-model-loading-20261015-v1.md)。

场景回复与 Chat 使用同一套原生操作图标、提示及用量/用时文案。最新一轮常显，历史轮在桌面悬停或键盘聚焦时显示；触屏始终可用。每侧统计可点击查看真实明细；网页在每侧回复下提供 1–5 分评分，双方完成后可保存、修改，保留赞/踩反馈。

交付文件使用与上传附件一致的类型图标、名称、类型和大小卡片，右侧提供独立下载图标；未知格式使用通用文件图标。正文中的已登记文件链接显示为蓝色文字，去掉文件代码胶囊，普通行内代码保持。下载继续核验原账号、文件大小和 SHA，详见[界面验收](docs/experiments/geneloop-delivery-file-cards-20261016-v1.md)。

DeepSeek 场景对照的 Baseline / Motif 两侧并行执行，各自保留会话、工具范围和任务预算；同一对话的下一轮仍等待当前轮结束。历史结果切换时恢复已确认的状态，首次读取显示加载状态。无 Session 路由的旧模型适配器继续串行执行。

会话开始后会根据用户内容生成简短名称；同一工作区自动重名时追加编号，手动改名和分支名保持。模型菜单按服务器实际可用目录提供 Flash / Pro；Flash / Pro 均提供关闭/低/高/最高的横向思考强度滑杆，选择立即反馈，后台依次保存；发送使用该轮实际选择，不静默替换模型。

场景对照在生成中逐段保留真实文字增量，并显示思考、工具和 MCP 执行状态。每侧末尾提供复制、赞/踩、分支、用量与耗时；轨迹页按真实对话顺序连续编号，普通轮次单列、对照轮次左右展示 Baseline / Motif，上方图表按轮独立切换侧别。已验证的 Motif 模型请求跳过用绿色文字标识。实现与浏览器证据见 [统一轨迹验收](docs/experiments/geneloop-unified-trajectory-20261016-v1.md)，真实模型行为证据见 [流式工作验收](docs/experiments/geneloop-live-workflow-20261015-v1.md)。

Web 的 DeepSeek 模型提供 **关闭 / 低 / 高 / 最高** 的横向思考强度滑杆（`off/low/high/max`），默认 Off。拖动、点击档位及方向键/Home/End 均可调整；显示立即更新，后台按顺序保存，发送等待该选择确认。Off 发送 `thinking.disabled`；其他档位发送 `thinking.enabled` 与原生 `reasoning_effort`。按会话保存并应用到本轮两侧任务，旧 On 的 `high` 值继续有效。附件入口不按场景限制扩展名，PDF、Word 和需求文本可随数据一起上传。平台会向模型提供可提取的正文和表格文本；未知二进制、损坏文件或未识别的扫描文字会明确标记，不能冒充已读。统计工具仍以真实数据表为依据，不从资料中臆造统计值。

三种文件场景共用上传版本与读取边界：`/ppt` 可使用 Word、CSV、PDF、JSON、TXT 资料生成可编辑 PPTX、PDF 和逐页预览，并绑定本轮明确要求的总页数；`/paper` 为普通资料校对导出 PDF/Markdown，原有结构化参考条目修订另行保留；`/data` 从 CSV/TSV、JSON 记录数组、Word 表格、带单元格边界的 PDF 表格、分隔文本表中提取原值，再完成统计及图表/PDF 交付。只有说明、没有观测数据时，交付明确注明“未进行统计”的资料核对报告；多表需选择，扫描 OCR 和任意复杂表格不在已验证范围内。非分页资料使用逻辑段引用，不冒充原 Word 页码。

这些导出依赖服务器的 ReportLab、PyMuPDF、中文字体及 PPT 渲染工具。部署须重新生成场景 policy、MCP 白名单和提示词，不能只替换前端文件。统计单位与合成数据声明通过带原文证据的分析计划绑定；要求 R² 时同时校验正文与统计表。真实下载、布局与内容复测记录见 [三场景修复验收](docs/experiments/geneloop-scene-delivery-repair-20261016-v1.md)。

图片附件通过 Harness 的原生附件服务送入模型，同时在每侧任务保存独立的版本化原图。PPT 和论文场景可基于原生视觉内容生成来源绑定的报告；数据图片须先逐格转录为冻结表格，再进入原有统计复算流程。视觉转录不等于独立 OCR 或数值认证，报告须说明识别误差风险；看不清的单元格不能猜补。清晰 PNG/JPG 的真实网页验证与边界见 [图片场景验收](docs/experiments/geneloop-native-image-scenes-20261016-v1.md)。

普通聊天默认展示最终回答，工具调用、上下文和早期回复收在可展开的过程区；生成中继续显示真实文字增量和简明状态。原生 Markdown、图片、文件入口以及最终回复的复制、分支操作保留。对照标题统一为 Baseline / Motif，影子模式另标“影子评估”。Web 共用 GeneLoop 产品身份；旧会话也在公开读取与实时输出时隐藏内部环境信息，原始 journal、用户消息和文件字节保持不变。代码行为、定向检查、真实浏览器及正式部署验收记录在 [本轮说明](docs/experiments/geneloop-message-privacy-20261015-v1.md)。

已有 PPT、论文、数据分析 Motif 库已统一到版本化的 [motif-libraries/](motif-libraries/README.md)。管理员在成员 Web policy 配置 `comparison_scenes: ["ppt", "paper-proofreading", "research-data-analysis"]` 后，原生 `/ppt`、`/paper`、`/data` 聊天分别执行 Baseline 与 Motif 两路，保留各自多轮历史、交付文件与赞/踩反馈。三个场景的 Motif 默认均为 **Execute**；Paper 新库只续接模型已选定来源的默认第一页读取，旧 Shadow 库及历史记录保留。历史数值评分继续显示，网页评分绑定本轮结果版本并持久保存。资料通过原生附件上传，账号隔离与预算沿用现有服务。库缺失或兼容锁失效会明确回退，不能把回退记为优化成功。

持续部署可使用 `scripts/serve-web-budget.py`，显式指定私有 output、现有累计 checkpoint 和获准上限；缺少 checkpoint 会拒绝启动，禁止因重启清零。用户于 2026-10-15 取消当前共享服务器累计 1 美元费用上限，配置使用 `--budget-usd 0`（policy 的 `run_budget_usd: null`），请求次数也不限；用户于 2026-10-16 进一步取消每任务及对照每侧的费用上限，`--task-budget-usd 0`、policy 的 `budget_usd: null` 表示不限。按后续指示，Web 单次文字输入不设应用长度上限，输出使用 `max_output_tokens: null` 表示无应用额度；2026-10-20起正式 DeepSeek Web 请求显式使用官方最大单次输出容量393216 tokens，避免省略参数触发默认8K截断，服务商上下文/容量边界仍适用。调用前持久化预约费用，未知使用量继续占用任务预算，累计账本照常记录。Linux 服务器的真实三场景功能验收和失败边界见 [联调记录](docs/experiments/trained-three-scenes-20261014-v1.md)。

四场景研究代码的分支整合与兼容验收见 [当前整合记录](docs/experiments/four-scenario-main-integration-20261014-v1.md)。论文生成工具/轨迹 RSI 的显式实验入口在 [论文场景](scenarios/paper-submission/README.md)，文献处理在 [文献场景](scenarios/literature-notes/README.md)。研究 CLI 与统一 Web 的工具契约不同，分支合并不会自动赋予旧实验库产品 Execute 权限；文献的任务级 Web 绑定和双栏评分仍需单独验收。

Web 场景快捷入口提供 `/ppt`、`/paper`、`/data`，输入前缀即可选择并显示有色标识，也可直接输入完整短命令和请求；普通对话无需选择 `/chat`，旧手写指令仍兼容。启用三场景对照的账号部署允许在同一可见对话中先 `/data` 再 `/ppt`，无需新建聊天；后台按场景轮换独立任务子会话，承接有界历史，并重新核验可用来源与交付文件。正在运行的回复须完成或取消后再切换。删除未发送的场景标记会切回普通对话；发送后清空编辑器只重置下一轮，不改变正在执行的任务。详见 [场景与账号控制](docs/harless-controls.md)。

面向用户的工作区只需填写名称，目录由服务器按账号分配；选中工作区后，“新会话”在该工作区创建独立聊天。界面不显示服务器目录或内部 preset ID，场景候选选中后立即显示蓝色标识，后台继续完成准备。文字、附件及二者组合都进入同一场景的 DSH / Motif 流程，保留完整工具，由模型判断直接回答、询问资料或调用工具；没有附件不会被发送入口拒绝。资料验证在实际工具调用时进行，Motif 仍只复用满足原有证据与权限条件的轨迹。三场景对照支持在同一可见对话中继续上传资料，每批新来源使用独立处理子会话并分别承接两侧近期讨论，原资料、结果与评分保留，不把旧来源回执用于新文件。

工作区侧栏保留文件夹图标、折叠和操作菜单；点击名称进入工作区概览，可置顶、改名或删除分组。删除前说明影响，既有聊天移至“未分组”，记录与文件保留。聊天支持从已完成回复创建独立分支，名称按原名追加 `（1）`、`（2）` 等编号；编号按账号持久保存，分支不共享原任务评分或写入权限。对照场景及切回的普通聊天显示真实回答增量和模型/工具执行状态；重连只读取状态，不重放付费请求。接口与边界见 [接口契约](docs/interfaces.md#连续场景流式状态与对话分支2026-10-15)。

GeneLoop 是本项目的产品名称，界面使用依据用户参考图绘制的无字螺旋图标。MotifAgent 的迁移内核负责有证据支持的结构执行；底层 DeepSeek Harness（DSH）负责 Agent 循环、语义判断、工具派发和会话，其来源与许可证归属保持不变。场景通过 MCP 扩展。模型选择仍显示真实提供商和模型名称；历史环境变量、协议标识、`/harless` 命令及仓库目录保持兼容，不因品牌更名修改其含义。

工作区名称行可再次点击折叠，右侧菜单与新建按钮独立操作；聊天可从标题栏或侧栏菜单移入回收站，并在“最近删除”恢复原会话及文件。网页数据报告测试包位于 [examples/web-data-report-demo/](examples/web-data-report-demo/)，包含 40 行合成材料实验数据、研究说明和可直接粘贴的 `/data` 提示词；它用于软件验证，不代表实际实验结论。

既有论文/DeepSeek 对照继续使用真实 DeepSeek API；共享 Web 现在可按服务器配置选择 GLM。服务器先加载 `.local/remote-env.sh`，在私有 `.env` 配置所需模型密钥（SDK 场景仍需 `DEEPSEEK_API_KEY`）；Web 用 `npm run web:real`，SDK 场景用 `npm run scenario:real -- --scenario scenarios/example/scenario.json --budget-usd 0.25`。Web 每任务与整次启动均默认不限；SDK 每次运行默认上限 0.25 美元，运行前核对预览与有效配置，超出既有上限另行确认。已完成一次 SDK/Harness/MCP 的真实 API 闭环：3 次 HTTP 200、4 次工具、来源引用一致，见[最小真实调用记录](docs/experiments/deepseek-real-api-smoke-20261009-v1.md)。3080 的历史服务为模拟模式；3086 真实 Web 后端两项任务已通过，浏览器点击体验仍待确认，见[连接恢复与真实 Web 验收](docs/experiments/web-real-recovery-20261009-v1.md)。

`npm test`、无模型 `smoke`、故障注入及旧模拟回归继续检查协议、权限和失败恢复。它们仅是开发诊断；不能作为模型回答、科研交付或真实降本的验收依据。真实 API 失败时记录失败，不切回固定模拟回复来报告通过。

旧试验、报告、应用专用启动器和失败试跑均在 `archive` / `archive-pre-cleanup-20261009` 分支。本机 `.local/` 是私有运行区，仍保留且不提交。清理范围与恢复方式见 [清理记录](docs/main-cleanup.md)。

## 十分钟启动

当前 SDK 场景入口使用 `import.meta.main`，需要 Node.js 22.18+；安装清单的宽松 engine 范围不能代替实际启动验证。Python 3.10.8 与 3.12 均已通过主线免费运行验收；科研 PPT 场景在服务器使用 Python 3.12，额外渲染依赖按场景说明安装。服务器 3.10.8 的主线验收见[验收记录](docs/experiments/server-python310-free-loop-20261009-v1.md)。先安装固定依赖，再跑不付费的检查：

```sh
npm ci
npm run setup
npm test
npm run smoke
npm run motif:check
npm run scenario
```

最后一条只输出场景、工具、提示哈希、预算和 `reasoning_effort="off"` 的预览。不会启动付费任务。Windows 的入口相同；Python 命令需要在 PATH 中，或设置 `SSS_PYTHON` 为解释器路径。已验证 macOS 本机，以及 Ubuntu / Windows CI 的 Python/Node 测试、18 题 MCP 检查与 Motif 样例闭环（Node 22、Python 3.12）；云模型和真实应用场景仍需各自联调。自定义 MCP 自身的平台依赖仍由场景负责人处理。

本次已配置的远程开发环境使用项目内隔离的 Node 与 Python 环境。在服务器项目目录先执行 `source .local/remote-env.sh`，再使用上述 `npm` 入口；该脚本是服务器私有配置，不随 Git 分发。

仓库文本统一 UTF-8/LF，由 `.gitattributes` 固定检出换行符；统一入口也为 Python 设置 UTF-8。冻结夹具和 Motif 证据按原始字节校验，不能因 Windows 换行符变化而更新锁中的哈希。Windows 已有旧检出副本时，保存自己的改动后重新克隆最新 main 最容易确保规则生效。Unix 的 `0600` 模式检查只在相应平台运行；Windows 文件访问由 ACL 管理，不能用该数字替代 ACL 验证。

明确决定付费运行后，先在本机环境或 Harness 的 `.local/dsh` 凭证存储配置密钥，再显式执行：

```sh
npm run scenario:real -- --budget-usd 0.25 --max-steps 16
```

每次请求经过本机预算代理；模型输出、轨迹、预算账本与 Motif 审计只写入 `.local/`。费用表是仓库固定配置，运行付费实验前应核对；预算记账不等于真实账单。`--max-steps` 限制 Agent 步数，代理账本才记录实际上游请求。默认不开上下文压缩。

## 官方 Harness Web 与动态任务入口

SDK 的 `npm run scenario` 继续保留。`npm run web` 默认启动 Harness Web 与 GeneLoop 任务接口：任务从官方聊天提交，`/harless` 使用 Harness 原生命令菜单选择场景、RSI 和执行模式。每项任务有独立 Session、模式、预算和记录；同一轮 DeepSeek 对照的两侧并行，普通任务及其他轮次仍串行调度；不再提供独立任务工作台页面或悬浮入口。服务器已验证 Node 22.23.3、Python 3.10.8；TypeScript 插件需要支持原生类型剥离的 Node，其他平台的 Web 尚未验证。

在服务器项目目录启动，本地建立端口转发：

```sh
# 服务器
source .local/remote-env.sh
npm run web
# 本地另一个终端
ssh -N -L 3080:127.0.0.1:3080 -p SSH_PORT USER@SERVER
```

默认动态运行时使用 `scenarios/general/`（New Scene），免费模拟模型、Shadow（RSI On），监听 `127.0.0.1:3080`。从本次 `.local/web/runs/<RUN_ID>/access-url.txt` 复制官方认证地址到本地浏览器，打开聊天首页即可。认证地址/token 为私有数据。原生 `/harless` 菜单的 PPT、Paper Proofreading、Research Data Analysis、Files 和 New Scene 分别加载服务器登记的 MCP、白名单与 Prompt：PPT 使用既有19工具；论文提供PDF/文本与静态LaTeX检查；数据提供CSV/TSV描述统计与Pearson相关；Files 盘点、读取、查重和索引任务上传文件，可显式授权整理副本；New Scene读取本Session上传文本。模式和RSI独立，菜单不调用模型，选择影响下一任务。PPT菜单可设置页数、模板及生成新副本权限；Files 菜单可设置只读或整理任务副本。免费和真实任务从聊天直接发送，服务端保留费用、请求上限与工具权限；旧页面跳回聊天，任务 API 保留。

PPT先安装 `scenarios/research_ppt/requirements.txt`，在该目录 `npm ci && npm run build`；需要兼容的LibreOffice、中文字体与静态Fontconfig才能输出。部署论文读取与报告导出时安装 `scenarios/paper_proofreading/requirements.txt`，普通校对报告也需要 PDF 渲染依赖；仅只读提取不需 PPT 渲染器。管理员在私有环境设置 `HARLESS_PPT_RENDERER_ROOT/HARLESS_PPT_FONT_ROOT`，缺失时只读可用、输出明确拒绝。`HARLESS_PPT_RUNTIME_BUNDLE` 指向已认证且代码锁有效的五文件包，当前仅接管闭合pin/read；没有库的场景可用Origin/Shadow，Execute On拒绝。部署成员能力只增加网关 `memberSceneDeployment` 只读挂载，输入、Session、产物和预算继续隔离。完整配置、范围与诊断见 [控制协议](docs/harless-controls.md)、[账号网关](docs/harless-account-gateway.md) 和 [上线准备记录](docs/experiments/harless-launch-readiness-20261014-v1.md)。V100 Ubuntu18/Node22.23.3/Python3.10.21已验证；完整模型自主PPT生成与科研质量未在本轮验收。

原生模型选择可切换服务器已启用的 DeepSeek Flash 与 GLM；默认免费模拟仍使用 DeepSeek。真实 Web 可在服务器私有 `.env` 配置 GLM 模型、密钥和价格。选定模型会绑定任务和预算账本；GLM 当前只接文字输入，真实 GLM 请求仍待验收。Codex 登录入口已撤销，当前不提供 GPT 登录。

文字字符串、`instruction`、`content`、仅含 user 的 `messages` 统一规范化为一次任务输入；结构化对象中的后三项必须三选一。`mode` 支持 baseline/shadow/execute。任务 API 可接收官方格式的图片 base64 或同 Session 已上传文件的 receipt，单文件上限 256 KiB；模型不支持图片时任务明确失败且不发起模型请求，不能据此宣称已支持图片理解。资料引用使用已由服务器登记的 `resource_id`，不接受浏览器本地路径。请求和响应详见[接口文档](docs/interfaces.md)。

`--scenario` 接受场景名或场景配置路径，用来选择初始运行时；`config/harless-scenes.json` 登记已接通的后台场景，每个场景使用独立的 MCP preset，当前诊断样例不在前端选项中。动态题面不再固定在场景文件中。资料登记为服务器私有 JSON，例如 `.local/inputs/resources.json`：

```json
{"paper-notes": {"text_file": "notes.md"}}
```

```sh
npm run web -- --scenario scenarios/example/scenario.json --resources .local/inputs/resources.json
npm run web -- --scenario portfolio-v1 --mode execute
```

`text_file` 相对登记文件，启动时读取 UTF-8 内容并冻结字节 SHA-256；前端用 `inputs: [{"resource_id":"paper-notes"}]` 引用，后端核验可选期望版本后将带来源标识的文本追加给模型。修改原文件不会自动刷新本轮快照。当前登记器处理文本快照，不代表已接通 Zotero 等真实应用。

三种模式由后端保存和执行。example 没有认证库，shadow 会记录原因并回到正常 Harness，execute 不可选；portfolio 的精确冻结样例可使用首发库。新题面、附件或资料版本不能沿用旧任务的认证绑定。模拟诊断中的 execute 已观察到 7 次请求、5 个结果验证通过的接管批次，不能当成真实质量或费用收益。

主要通过原生 `/harless` 选择菜单操作。具体参数命令仍可用于诊断；裸命令在不支持浏览器装饰的客户端会提示使用菜单。支持：

```text
/harless list
/harless mode shadow
/harless rsi off
/harless status
```

Mode 菜单显示 Origin、Shadow、Execute；Origin 在协议中仍为 `baseline`。RSI 默认 On，切换模式不改变开关；Off 保留所选模式，但下一任务按 Origin 执行。没有有效认证库或所需匹配服务时 Execute 会被服务端拒绝；Shadow 可以运行并明确记录普通 Harness 回退。菜单选择本身不调用模型，只影响后续任务；每轮独立登记任务及预算，不能沿用旧任务授权或证据绕过新输入检查。

目前登记 `example`、`portfolio-v1`、`portfolio-v2` 三个合成资料场景；新增场景由服务器维护登记表和 MCP 配置。PPT MCP 与自动持续学习发布尚未实现。可选的 Linux 账号网关提供邀请码注册、独立 Harness Home/工作区及按账号隔离的预算路由；它需要单独配置并通过反向代理公开，直接运行 `npm run web` 仍是单用户开发入口。配置与限制见[账号网关部署说明](docs/harless-account-gateway.md)，任务接口见 [Harless 控制接口](docs/harless-controls.md)。

后台保留双层费用记账：Web 每任务、全启动和输出上限默认均为 `null`；请求次数默认不限，新任务不重置累计费用与请求计数。任务费用用 `--budget-usd` 配置，全启动费用用 `--run-budget-usd` 配置；可选 `--request-limit/--run-request-limit` 正整数仍支持次数上限，CLI `0` 或配置 `null` 表示不限次数。推理档位按本轮 Off / On 选择，默认关闭压缩；请求、缓存输入/输出 token、费用和 verified skips 仍完整记录，代理估值需与账单核对。免费模拟不展示额度表单，实际支出为零。

真实连接在服务器根目录的私有 `.env` 填写 `DEEPSEEK_API_KEY` 或 `HARLESS_GLM_API_KEY`；GLM 还要配置 `HARLESS_GLM_MODEL`、官方 `HARLESS_GLM_BASE_URL` 和两项保守的美元/百万 token 价格，字段见 `.env.example`。密钥只由服务器读取；浏览器 API 仅收到模型名称和可用状态，不读取 `.env`。不要提交或发送密钥。统一 npm 入口通过 Node `loadEnvFile` 读取它（要求 Node 20.12+），已有环境变量优先。填写密钥不会自动调用付费模型：

```sh
npm run web:real
```

这个显式入口只开放真实连接。官方聊天发送后立即登记并执行任务，不显示预算确认页面；任务 API 仍保留显式预览和提交操作。发送前可在输入框旁选择场景、RSI 与模式，服务端继续累计费用和请求数，并保留管理员配置可选上限的能力。此前的[确认流程验收](docs/experiments/native-chat-confirm-20261009-v1.md)记录的是旧界面；SDK 的真实 API 基本连通已通过，真实 Web 后端最小闭环已通过；当前直接发送的浏览器体验和科研交付质量仍待验收。

GLM 请求通过本地预算代理绑定已提交任务；`HARLESS_GLM_BASE_URL` 仅接受智谱官方 HTTPS API 根地址。价格由管理员按所用模型与账户填写，代理估值不等于账单实付。当前 GLM 已完成假密钥启动、模型目录与任务预览验证，真实 GLM 请求和工具调用仍待配置有效密钥后验收。

免费复验、旧入口与停止：

```sh
npm run web:tasks:check
npm run web:controls:check # 免费原生命令与多场景协议诊断（真实验收加 --real-model）
npm run web:check
npm test
npm run smoke
npm run motif:check
# 旧固定题面/单任务入口，保留回归用途：
npm run web -- --frozen --scenario portfolio-v1 --mode execute
# 前台用 Ctrl+C；后台仅停止指定 RUN_ID，保留结果：
node scripts/project.mjs python scripts/stop-harness-web.py RUN_ID
```

服务器已通过 146 项 Python、44 项 Node、13 组动态 HTTP/MCP、11 组冻结协议诊断，以及 18 题/83 来源 smoke；Motif 样例闭环也已通过。实际付费为零，详见[动态任务验收](docs/experiments/dynamic-web-tasks-20261009-v1.md)与[Web 交接](docs/handoffs/harness-web.md)。HTTP 诊断不代替浏览器体验和真实质量评审。每个动态任务的数据独立位于 `.local/web/runs/<RUN_ID>/tasks/<TASK_ID>/`，含输入/配置快照、会话事件、答案、ledger 和 Motif 审计；启动目录另保留全局预算账本。goal 续轮、队列编辑、fork 或 steer 不能绕过既有任务绑定，改变要求需创建新任务。

当前适用于同一获授权操作人的服务器联调，没有多人账号隔离、跨启动任务恢复或论文工具闭环；官方文件浏览能力也不是多人文件沙箱。具体实现与限制见[接口文档](docs/interfaces.md)、[Web 交接](docs/handoffs/harness-web.md)及[冻结入口验收](docs/experiments/harness-web-v1-20261009.md)。

## 代码从哪里读

| 目录 | 责任 |
| --- | --- |
| `scenarios/` | 各同学的 MCP 配置、题面、服务、工具契约 |
| `src/adapters/scenario.py` | 校验场景并生成私有 DSH 插件配置；支持 stdio / streamable-http |
| `src/adapters/harness_runtime.py` | Python SDK → Node Harness 的唯一启动边界 |
| `src/adapters/dsh_scenario_guard.mjs` | 限定场景工具集合，阻止绕过 MCP 读仓库或执行 shell |
| `src/adapters/dsh_online_motif.mjs` | DSH 原生插件；在模型请求前匹配认证 Motif，在工具结果后复核 |
| `src/adapters/dsh_trajectory.py` | Harness 原始工具事件 → 带参数来源的轨迹 |
| `src/motif_core/offline/` | 轨迹挖掘、DAG/参数流编译、独立留出认证与 library 产物 |
| `src/motif_core/controller.py`、`read_executor.py` | Python 结构控制、依赖/证据守卫、handoff/reentry |
| `src/motif_core/online_skill_runtime.mjs` | DSH 插件使用的在线执行子集，含受限纯代码参数转换 |
| `tests/` | 结构核心、接口、版本失效、权限拒绝与安全回退回归 |
| `benchmarks/research_decision_portfolio_v{1,2}/` | 18 项冻结的合成科研决定，仅供开发诊断 |

先读 [接口契约](docs/interfaces.md)，再复制 `scenarios/example/` 接一个新场景。`src/motif_core/LICENSE` 和 [来源及迁移记录](src/motif_core/PROVENANCE.md) 必须保留。

科研 PPT 场景的安装与最短入口见 [research_ppt](scenarios/research_ppt/README.md)：接收 PDF/PPTX、生成可编辑 PPTX，并在 Linux 服务器通过 LibreOffice 输出真实预览。其渲染、字体和场景依赖需另外安装；PPT 场景的真实 Windows 运行尚未验证。来源读取 Motif 与普通组合生成脚本的边界见接口契约，不把脚本执行计为 Motif 收益。

科研 PPT 试用统一使用 `npm run ppt -- --input .local/inputs/paper.pdf --slides 6 --template lab --allow-output`：默认准备普通 DSH／组合优化两路预览，双路总上限 $3、每路 $1.50，不调用模型。确认预览后用 `npm run ppt -- --trial <实际trial.json> --call-model` 执行；完整命令、评审与费用范围见[双路试用](scenarios/research_ppt/trial.md)。朴素 `lab` 保留科研原图与可编辑数据，不强迫填满卡片；原生模板实验服务仍属历史隔离试用，不是此默认入口。

部署反馈与离线学习见[使用说明](scenarios/research_ppt/feedback-learning.md)。仅显式授权时收集，质量未审阅不进入训练；独立认证生成候选，后续真实任务验证收益后才可受控晋级。`--use-active-learning` 显式继承当前有效版本，没有已晋级版本时走普通流程并记录原因。不能仅因工具生成或测试通过宣称自进化收益。

## 随仓库分发的 Motif 库

[首发样例](examples/motif-library/research-portfolio-v1/README.md) 包含此前真实 DeepSeek 调用轨迹编译出的 4 个 Motif、在线 manifest、公开证据夹具和版本锁。任务资料为合成科研模拟；历史认证摘要保持不变，没有分发原始私有日志。

`npm run motif:check` 无需密钥，用真实 Harness/MCP 和本机模拟 Provider 检查重编译一致性、执行、shadow 及旧版本回退；`npm run motif:rebuild` 只重编译到 `.local/`。新克隆无需旧 `.local` 数据。它是调试验收起点，不代表真实科研质量或费用收益。加载命令和适用范围见样例说明。

## 18 题怎么跑

```sh
npm run scenario -- --scenario scenarios/portfolio-v1/scenario.json --case l_state_update
npm run scenario -- --scenario scenarios/portfolio-v2/scenario.json --case a_model_rsi_figure
```

默认均为预览。`npm run smoke` 会经真实 stdio MCP 客户端遍历全部 18 题，验证冻结哈希、对象句柄、版本和八种只读工具，并初始化 Harness SDK；不调用付费模型。这能证明工具链可用，不能证明 Agent 会答对题或 Motif 已降低科研成本。付费普通组/结构组和盲评需要另外运行并记录。

Motif 模式的入口与普通组相同，增加 `--mode shadow` 或 `--mode execute`、`--manifest`、`--task`、`--embedding-endpoint`、`--embedding-model`。只能使用轨迹编译且认证通过的 library；完整数据契约与命令见接口文档。

## 两天协作约定

每人一个场景分支，例如 `codex/scene-literature`、`codex/scene-results`、`codex/scene-collaboration`，主要改自己的 `scenarios/<name>/` 和对应测试。你负责公共接口和合并；核心变更先协调。每个小改动提交一次，通过 `npm test` 后发 PR，尽早合回 main。合入别人的工作后，各自同步最新 main。具体操作见 [协作说明](docs/collaboration.md)。

## 科研 PPT 历轮报告与恢复交付

历轮 PDF 的文件身份和结论见 [报告索引](docs/experiments/research-ppt-reports/README.md)；PDF 本体保留在团队私有归档，不进入 main，历史失败和勘误仍可按索引追溯；原始论文、运行日志、凭证仍只保存在私有区域。报告版本数量不等于独立实验数量。

V7/V8 的同任务 MCP 重启恢复及 TypeScript 有限交付入口见 [恢复与交付说明](scenarios/research_ppt/delivery.md)。新增入口仍使用 Python 场景工具后端；未实现无 Python 插件产品。最新两题对照的 Motif 组请求、token 和代理估费均增加，且未达到统一人工质量门槛，不支持整体降本。详见 [V7](docs/experiments/research-ppt-v7-delivery-rsi-20261011.md)、[V8](docs/experiments/research-ppt-v8-cost-quality-rsi-20261011.md)。科研 PPT 为场景 pilot，不能代替主线跨应用科研决定验收。

后续工程结果见 [V10](docs/experiments/research-ppt-v10-product-20261012.md) 与 [V11](docs/experiments/research-ppt-v11-scientific-design-20261012.md)：V10 在两份相同明确标题编辑任务中由普通入口省去模型；V11 增加科研原图、结果、方法页型并交付三组同内容对照和一份真实新稿。两者都不称新增 RSI。原始轨迹、来源及 PPT 仅保存在私有区，独立科学/视觉人评与完整生成净成本仍未证明。

### GeneLoop 多场景 Web

`npm run web` / `web:real` 默认打开 `new-scene` 普通 Harness + Session 文件工具；`/harless` 的场景菜单直接选择服务端登记配置。PPT 连接现有19工具交付后端（需按 `scenarios/research_ppt/README.md` 安装依赖并构建），论文校对5工具、数据分析4工具及通用场景2工具均有正式后端。当前仅PPT的冻结只读来源链有生产认证库；其他场景 Shadow 记录无库回退，Execute On 明确拒绝。RSI Off 保留模式选择并实际采用 Origin。PPT 代码或Prompt变化会使旧部署包的版本锁失效，须重新认证后才可恢复 Execute。

任务与用户启动实例分别隔离；菜单不调用模型，已确认任务不随菜单变化。PPT 默认只读，生成页数/模板/输出权限经任务 API 设置后确认；原生聊天尚无该参数编辑界面。完整配置、用户入口依赖和验收见 [Harless 控制协议](docs/harless-controls.md)。`npm run web:scenes:check` 检查实际 Harness/MCP 与两用户实例隔离；`-- --real-model` 明确启用最多0.06美元的只读模型验收。历史样例工具只用 `--scene-registry config/harless-diagnostics.json --scenario example` 等显式诊断配置，默认产品菜单不映射样例。

`feature/rsi-research-agent` 的文献与文件管理实验入口和 `feature/research-ppt-agent` 的 V16/V17 场景代码已在独立后续集成分支整合。它们不自动成为四个产品菜单场景；PPT 旧双路主聊天不继承 Mode/RSI，故未注册到默认 Web 任务入口。集成状态与尚需的固定字体复验见[主线交接](docs/handoffs/main.md)。

## 论文参考文献与 RSI 兼容整合

`/paper` 保留普通 PDF/Word/CSV/JSON/TXT 校对、来源表格摘要与 PDF/Markdown 交付，同一场景按需使用安全 LaTeX ZIP、参考文献取证、历史脚本与只读 Motif；不会为每种任务另建 Agent。当前为 24 个工具，普通报告无需私人排版包。服务器默认继续加载 `motif-libraries/paper`；管理员可配置 `HARLESS_PAPER_RUNTIME_BUNDLE` 覆盖默认库，配置错误会拒绝激活。历史参考文献排版另用 `HARLESS_PAPER_RENDERER_ROOT`。原 23 工具包须按当前完整 MCP Schema 和代码重编，不能直接复制旧认证文件。

场景选择、RSI On/Off、三种模式、用户隔离和预算沿用 main。普通校对不强制输出参考文献报告；正文输入仍可先咨询或请求上传。机制验证与净降本结论分开，历史记录见 [RSI 闭环](docs/paper-rsi-loop.md)，整合部署步骤见 [论文交接](docs/handoffs/paper-proofreading.md)。


实验分支新增脚本内部依赖片段挖掘、当前数据引用/局部修改以及原生工具连续执行，仍经原生 Evidence/版本/权限守卫。它们由私有 Script sidecar 显式启用，生产默认保持不变。当前真实完整任务尚未证明稳定合格净降本；配置、复现与边界见[统一复用接口](docs/interfaces.md#实验性统一复用协议2026-10-19)和[实验记录](docs/experiments/paper-unified-reuse-20261019-v1.md)。

论文 Script Motif 的边界快照重放、有界诊断片段和当前产物引用仍为显式实验功能；`--report-evidence`可给两组对照同时启用隔离的缺字修复与失败字段证据，不修改生产导出模块或旧认证库。连续接管次数不能直接折算净费用，当前仍未验证独立论文上的稳定合格降本。入口、默认关闭的副作用权限和复现见[接口说明](docs/interfaces.md#边界快照诊断片段与隔离导出变体2026-10-19)与[本轮记录](docs/experiments/paper-evidence-slice-20261019-v1.md)。

论文实验的当前恢复目标、版本化失败字段与成功产物复用已接通：`--report-evidence --preserve-recovery-structure`可在显式局部恢复中拒绝子集交付、复用完整参数做叶子补丁，并核验当前成功文件后交回总结；公开默认不启用。真实页数失败任务已完成17字段补丁及六页交付，37条记录与来源保持；早期错误交付、低效尝试与费用均保留，未主张稳定净降本。见[实验记录](docs/experiments/paper-recovery-evidence-20261020-v1.md)。

论文检索证据实验通过 `run-script-motif-experiment.py --retrieval-evidence` 显式启用，保留每个查询的候选来源，并在原 `web_search` 中提供同任务证据 ID 选择；不新增工具，不把检索候选当作正式发表结论。局部只读验证可用 `--no-output --evaluation-scope local_retrieval_validation`；`--search-output-tokens` 仅调整实验搜索模型的输出上限。已有四次真实局部运行尚未触发证据复用，不能据费用较低的两次运行宣称 Motif 降本；质量反例、失败回归和全部费用见[检索证据实验](docs/experiments/paper-retrieval-evidence-20261020-v1.md)。生产默认和认证库不变。


论文恢复实验新增显式`--resume-current-operation`：当前任务已选择的完整操作，经任务/来源/授权/Schema核验后由Runtime先执行一次，失败交回修订、成功交回总结。两次真实正常恢复均只需1个模型总结请求；复杂页数恢复仍有18/43请求和不可靠解释，尚未证明稳定净降本。全部仍为显式实验入口，非生产默认；失败与累计费用见[新实验记录](docs/experiments/paper-recovery-control-20261020-v2.md)。

Negative Motif 恢复实验已接纳 `failed_checks`，支持把已审阅结构校验器与当前完整目标编译认证为重试条件；真实恢复实际发送13次提示、6次局部早停。页数原因仍未知，字段引用候选尚未被真实模型选用，复杂修订未稳定降本；三次全部结果、超时和待结算费用见[接入实验](docs/experiments/paper-negative-recovery-20261020-v1.md)。配置仍须显式启用，不修改生产库。

后续[成因与修复实验](docs/experiments/paper-recovery-page-policy-20261020-v1.md)定位到基准引擎的6页上限与论文自然页长要求冲突，修正在隔离导出器中完成；旧基准和生产库保留。新增`inspect`读取当前字段及显式`repairChoices:true`：模型选择恢复或unknown，Runtime复制认证字段并重验。两种真实历史结构恢复及差异交接复核均为2请求；开放修复的29请求反例与全部学习/复测费用保留。最终说明现以本轮起点差异为准，仍不代表完整论文质量或一般净降本已验证。 [PR95](https://github.com/jingyio/GeneLoop/pull/95)供审阅，未合并或部署。
