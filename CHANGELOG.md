# 更新日志

本项目的重要变更记录在此文件中，格式参考 [Keep a Changelog](https://keepachangelog.com/zh-CN/1.1.0/)。

## [Unreleased]

### 新增：截图自动化（P2）

- 新工具 `src_screenshot`（planner/worker）：宿主用本机 headless Chromium/Chrome
  对资产（或同 host 的指定 URL）截图，走录制代理、校验任务范围与作业时间窗。
- 截图落成 `evidence_artifacts`（sha256 内容寻址、MIME/大小可核对），并自动创建
  一条 fact 证据节点；返回的 `node_id` 可直接作为 `src_mark_check` 的 evidence。
- screenshots 收尾项不再"挂个节点就算"：done 必须关联真实 `image/*` 产物。
  平台 `require_screenshots` 时，done 且未给证据节点会自动截一张。
- 新增 `GET /api/evidence/artifacts/{id}` 原文件读取；SRC 页收尾项弹窗可直接查看
  截图；批量交付 zip 增加 `attachments/screenshots/`。
- 顺带修复：`ValidateCheck` 现在从 asset_id 解析资产类型（此前 agent/HTTP 点收尾项
  只传 asset_id，导致所有收尾项被误判为"不适用于资产类型"）。
- 回归：证据产物存取/哈希校验、headless 截图端到端（截图→产物→节点→收尾项校验）、
  普通 fact 节点不能冒充截图。

### 新增：人工复核队列（P2）

- 新接口 `GET /api/review/queue`：聚合五类需要人看的项——报告缺段（medium+ 无可提交件）、
  复验存疑（最近 completed 结论 inconclusive）、疑似重复（dedupe_of 未定案）、
  预算停格、四件套全 N/A 资产。
- 排序按「严重度 + 类型权重 + 停留天数」：重复 > 报告缺段 > 复验存疑 > 预算停 > 全 N/A。
- `POST /api/review/actions` 支持批量接受 / 打回 / 退回重测（一次 1–100 项）：
  - 接受：确认发现（confirm）或把已登记 dedupe 的台账推到 duplicate；格类留痕即可；
  - 打回：发现标误报、解除 dedupe_of、或把格删回空白；
  - 退回重测：启动独立复测，或删格变回空白交给 planner。
- 裁决写入 `review_decisions`，已处理项不再重复出现；底层行变化会产生新 ref_key。
- 任务页新增「复核队列」入口：展示类型/严重度/任务/发现与原因，支持全选、备注与批量动作。
- 回归：五类聚合与去重键、裁决留痕 upsert、接受/打回/退回重测端到端。

### 新增：计划任务与模板接 SRC（P2）

- 任务模板新增 SRC 预设：`mode` / `src_program_id` / `inherit_coverage`。模板管理
  可设置模式、平台项目与「默认继承近期覆盖」；应用模板时一并带入建任务表单
  （模式、项目、继承勾选），切换回普通渗透会清掉 SRC 专属字段。
- 计划任务 `task_spec` 新增 `mode` / `mode_doc` / `src_program_id` /
  `inherit_coverage` / `token_budget` / `priority`；到点触发与「立即运行」都走
  与 HTTP 建任务相同的准备管线（项目规则、SRC 快照、策略、覆盖继承）。
- 保存计划任务时就用同一管线校验，配置错误在写入当天暴露，而不是等触发失败。
- 计划任务弹窗新增模式、平台项目、继承覆盖；模板弹窗新增对应字段，模板预填
  也会带入这些设置。
- 回归：模板 SRC 字段存取/切回普通渗透清理、计划任务与模板预设端到端落到
  触发建出的任务（mode/src_program_id/token_budget）。

### 新增：跨任务复用——枚举缓存与历史覆盖提示（P2）

- 资产级枚举缓存：`src_probe` 的 `paths/js/methods` 结果按
  `(asset, probe_key, target)` 缓存 12h，二次任务直接复用；`force=true` 可重跑。
  `non404` 依赖本任务流量，不入缓存。资产 URL/端口变化自动失效。
- `src_state` / `graph_overview.src` 新增 `prior_coverage`：同一资产在其他 SRC
  任务里的最近终态（30 天内、只读提示）。planner 可据此复用 tested_clear/na，
  或先确认 tested_found 是否已交付；建任务时开启覆盖继承可自动带入。
- SRC 页显示「跨任务结论 N」角标；探针返回 `cached=true` 时明确提示是历史结果。
- 已有负知识回流保持原样：平台驳回会把同技术栈同类型的打法卡记 failed；
  duplicate 不记失败，避免污染成功率。
- 回归：缓存按 target 隔离/过期失效、prior_coverage 只含其他任务、探针缓存键
  对参数顺序不敏感且 non404 不缓存。

### 新增：任务队列优先级（P2）

- `tasks.priority`（-1000–1000，默认 0，越大越先）：并发槽释放时排队任务按
  **优先级降序 → queued_at 升序 → 任务 id** 调度；只影响排队顺序，不抢占运行中任务。
- `POST /api/tasks` / `POST /api/tasks/batch` 支持 `priority`；批量扇出的每个分片
  使用同一优先级；`PATCH /api/tasks/{id}` 可在线调整（`priority`）。
- 建任务弹窗新增「排队优先级」，任务列表对非零优先级显示 `P` 角标。
- 回归：优先级存取/补丁、队列排序（优先级分层内保持 FIFO）。
- 取舍：优先级仍是**显式**输入，没有按 program 价值/资产等级自动打分——那些维度目前
  没有可靠的结构化字段，自动打分只会制造不可解释的排序。

### 新增：批量任务扇出与分片（P2）

- 新接口 `POST /api/tasks/batch`：按关联企业 / 来源任务 / 显式资产 id 解析资产，
  按 **host** 或 **root_domain** 分组，再按 `assets_per_task` 打包成互不重叠的分片；
  支持 `dry_run` 预览、`max_shards` / `max_assets` 上限与 `campaign_name`。
- 每个分片建一个任务，使用**精确 scope**（subdomain/root_domain/ip）与
  `task_asset_links`，不再把整个企业范围灌进每个任务；所有分片归入同一 campaign。
- 新增任务级 token 预算覆盖（`tasks.token_budget`，0=全局）：批量扇出可按片设预算，
  引擎的 70/85/95/100% 护栏优先使用任务覆盖值。
- 单任务与批量扇出共用同一条创建管线（项目规则 / SRC 快照 / 策略 / 覆盖继承），
  避免两条路径逐渐漂移。
- 建任务弹窗新增「批量扇出」：分片方式、每片资产上限、最大分片数、每片 token 预算、
  campaign 名称与「预览分片」。
- 取舍：host 分组不拆开（scope 是 host 级，拆开会让分片重叠）；单个 host 超过每片
  上限时独占一片。并发仍由全局任务并发上限与每任务 worker 数控制。
- 回归：资产并集解析与上限截断、创建时 scope/asset link/预算原子写入、
  批量接口 dry-run + host 分片 + campaign + 精确 scope。

### 新增：全局出站速率治理（P2）

- 录制代理新增**全局 + 单 host 两级令牌桶**：Bash/curl、run_execution、WebFetch、
  browser MCP 等所有经过录制代理的目标流量统一排队，不再依赖每个工具自觉限速。
- 到达上限时**等待而不是报错**；等待超过上限（默认 10s，可配）后放行（fail-open）
  并计入 waived——限速的目的是避免打挂目标/触发风控，不是让任务无故失败。
- 设置项 `egress_global_qps` / `egress_host_qps` / `egress_max_wait_ms`（0 = 关闭），
  系统设置页即时生效，改完不需要重启或重建 agent。既有任务并发、worker 数与
  program 探针 QPS 仍各自生效。
- 边界：只治理经录制代理的流量；capture 关闭且未配置全局出口代理时目标直连，
  不经过代理层。设置页已写明。
- 回归：令牌桶节奏、host 桶隔离、超过等待上限 fail-open 与计数、关闭后立即放行。

### 新增：资产级 token 预算（P2）

- `llm_usage` 增加 `asset_id`：按意图 payload 的**主资产**归因（多资产意图只记第一个，
  避免同一笔用量重复计入多个资产）。planner/无资产调用记 0。
- `mode_doc.asset_token_budget`（0 = 不限）+ 全局默认 `src_asset_token_budget`：
  建任务时快照，运行中改全局不影响已建任务。
- 达到上限后：
  - `add_intent` 拒绝该资产的新意图，提示转向其他资产或提高预算；
  - 引擎协调器每 15s 扫描，把该资产仍未完成的格自动标为 `budget_stop`
    （已有终态不改写，worker 后续写回的新结论会自然覆盖）；
  - 向 planner 投递一次提示并在时间线留痕。任务本身不因此收尾。
- `graph_overview.src` 与 `src_state` 暴露 `asset_token_budget` / `asset_token_usage`
  （榜单最多 20 个资产）；SRC 页显示每资产用量与预算，系统设置与建任务弹窗可配置。
- 回归：按资产归因查询、意图准入拒绝、引擎自动收口（保留已有结论、重复扫描不重复收口）。

### 新增：跨任务覆盖继承（P2）

- 建任务时可勾选「继承近期覆盖」：经 `POST /api/tasks` 的 `inherit_coverage`（或
  `inherit_coverage_from` 指定来源任务）把历史 SRC 任务的结论带进新任务。
- 只继承本任务范围内资产的 **tested_clear 格**与 **done 收尾数字**；
  不继承发现、N/A、budget_stop（发现属于旧任务证据链，N/A 依据可能已变化）。
- `src_cells` / `src_checks` 新增 `inherited_from_task_id`：继承行的 evidence 留在
  源任务，收尾门对带继承来源且有说明的 clear 不再要求本任务证据节点；重测并覆盖后
  继承标记自动清零，attempts 从 0 重新计（继承不消耗本轮尝试预算）。
- 来源选择：显式 `inherit_coverage_from` → 同平台项目 → 同企业 → 新任务范围内有共同
  资产；只取 30 天内、且有重叠结论的 SRC 任务，按最近活动排序。
- `src_state` / 覆盖矩阵快照与 UI 增加继承徽章与 `inherited_cells/checks` 统计；
  planner/worker 提示词说明"继承格默认视为已测，站点变化时可复测覆盖"。
- 回归：继承只复制 clear/done、范围过滤、来源排序、重测清除继承标记。

### 新增：模型分层与成本归因（P2）

- `llm_profiles` 增加 `tier`（cheap / standard / strong）与四个单价
  （`input/output/cache_read/cache_write_price_per_mtok`，USD / 1M tokens）。
  tier 拼错/空值在 store 层回落 standard，负单价归零；旧库幂等补列并加 CHECK。
- `llm_usage` 增加 `intent_id` 与 `cost_usd`：每次调用按**调用时**的 profile 单价折算，
  改价不回溯历史账；0 单价记 0（表示未配置，不是"免费"）。
  `TokenByModel` / `UsageByProfile` / `UsageDaily` 一并聚合成本。
- 新设置 `llm_auto_tier`（默认关）：任务角色在既没有 Agent 显式绑定、也没有任务配置链时，
  planner/goals 自动选 `cheap`、worker 自动选 `strong`；同档候选按「激活配置 → priority
  降序 → id 升序」选择且必须能构建 provider。显式绑定与任务链永远优先，自动选择不会覆盖。
- `llmrec` 新增 `Prices.Cost` / `WrapPriced` / `WithIntent`；engine 在 worker 运行时把
  `intent_id` 注入 context，成本可归因到具体意图。legacy `saveLLMConfig` 不再清空
  tier/单价。
- UI：配置弹窗增加 tier 与四个单价输入；任务总览的 token 卡片显示成本（合计 + 按模型）。
- 文档/评测：`docs/SRC评测口径.md` 的成本口径补上 `cost_usd`，可直接算
  「每条有效发现的成本」。
- 回归：`Prices.Cost`/意图 context、tier/单价存取归一、按模型成本聚合、
  自动分层角色映射与候选排序。
### 修复：SRC 收尾门的三处绕过

- **超时/预算收尾不再绕过收尾门**：`settleTask` 的终局 planner 轮返回 `met` 时也要过
  `srcFinishGate`；门不过就落 `timeout`/`policy_blocked` 并保留缺口，不能因为"时间到了"
  把未清零的 SRC 任务标成 `done`（`server/engine_timeout.go`）。
- **范围为空不再判完成**：`CheckFinish` 在任务范围内没有任何站点资产时报
  `no_assets` 缺口并拒绝收尾（`srcmode/gate.go`）。`keyword` 仍只作提示、不认领资产；
  空 scope / 只有 keyword 的任务会明确显示"范围为空"，而不是静默 `finishable=true`。
- **台账不能绕过交付校验**：`draft→ready` 与 `ready→submitted` 现在要求
  `report_ready=true` 且 `compliance.ok=true`；只 PATCH 状态不再能清掉收尾门的交付缺口
  （`db/src_submissions.go`）。
- 回归：`TestSettleStatusFor`、`TestCheckFinishWithoutInScopeAssets`，以及台账用例新增的
  两条拒绝路径；`srcmode`/`db` 集成测试在干净 PostgreSQL 测试库上通过。

### 修复：SRC 判定 / 交付的第二批门漏

- **阈值覆盖可降档**：`check_thresholds` 现在有显式覆盖就生效（此前只允许抬高，
  平台档承诺的 `paths:0` 静默失效）；判死三条件补上 `local_unreachable=1`。
- **规划者也过拦截面**：`Planner.SetGuard` 接线，规划者的 Bash / `run_execution`
  与 worker/main 一样走 RoE 范围门、拦截规则与 LLM 裁判。
- **收尾进度真正写回**：`srcFinishGate` 判定后调用 `SetSrcProgress`，任务列表的
  `tasks.src_*` 不再恒为 0。
- **平台等级进提交件**：`【提交信息】`优先展示 `severity_map` 映射后的等级；单条
  导出也补上提交块（此前只有交付准备与批量包有）。
- **提示词变量对齐**：`WorkerName` 真正传入 worker；`AssetSummary` 在 agent 实例上
  **只算一次**后注入（每轮变化会击穿 prompt cache），实时态势仍由 graph_overview 提供；
  移除从未提供数据的 `FindingsSummary` 目录项；模板渲染失败改为打日志，不再静默回退。
- **导出跑正文校验**：单条 md/docx/check 与批量 zip 都会跑 `ValidateReportText` /
  `CheckReportMarkdown`，问题以 `⚠` 写入文件备注（不阻断，交给人工）。
- **SRC 冲突裁决**：system prompt 最前面加最高优先级声明；同时从基础正文里删掉
  「拿到据点 / 读到凭据 / 留在目标上的东西」三条与「深度优先于覆盖度」，收尾词前置
  SRC 纪律（不写据点/凭据/webshell；gaps 未清零不 prove_goal）。
- **每资产意图上限落地**：`max_intents_per_asset` 不再是提示词约定——`add_intent` 会
  数本任务已派到该资产的意图，吃满预算直接拒绝（继承的只读意图不占额度）。
- **平台作业时间窗硬执行**：`time_window` 写进 `mode_doc` 快照；guard 在每次受管工具
  调用前检查，窗口外直接拒绝 Bash / `run_execution` / WebFetch / `shell_*` / 写文件，
  不再只是提示词约束。空窗口 = 不限；坏快照 fail-closed。
- **越权读取上限进提示词**：`max_records_read` 写进平台规则说明（仍是提示级约束，
  未做流量级硬拦）。
- 回归：阈值降档/判死三条件单测、`TestPlannerGuardHooks`、提示词变量渲染、
  导出正文校验；`go test -p 1 ./agent ./srcmode ./db` 在干净测试库通过。

### 修复：SRC 终态语义收紧（P0-6）

- `tested_clear` 默认必须挂 `evidence_node_id`（一条 fact）；只有 program 规则
  `allow_reason_only_clear=true` 时才允许只写说明。收尾门与写入校验同一口径。
- `static_page` 只对输入/执行/对象类面生效（injection / xss / ssrf / upload / rce /
  authz / logic / session / csrf）；`paths` / `cred` / `host` / `takeover` 不再接受
  "纯静态页"当免测理由。
- `platform_exempt` 必须有 program `rules.exempt_areas` 的显式声明，不再是无条件
  万能 N/A；`out_of_scope` 保持原语义（范围外资产，仍需 reason）。
- 回归：clear 证据/allow 开关、platform_exempt 豁免依据、static_page 按面白名单、
  Program→mode_doc 编译；集成测试夹具显式打开 allow 以聚焦各自断言。

### 新增：ROI 排序与止损（P2）

- `mode_doc.area_roi`：创建任务时按台账历史算风险面产出率乘子（0.5–1.5）。
  有 program 时优先用该项目；已结算台账不足 5 条回落到全局，避免小样本噪声。
  评分口径：accepted/paid=1、ready=0.5、rejected/duplicate=-0.25，除以已结算数。
- `CheckFinish` 新增 `asset_yield` / `cold_assets`：资产已投入 ≥4 个终态格仍零发现
  判为冷资产，其补格与收尾项缺口优先级 ×0.3（只降权、不阻塞，缺口仍然要清）。
- `graph_overview.src` 与 `src_state` 暴露 `area_roi` / `cold_assets` / `asset_yield`；
  planner 提示词要求优先换资产/换面，把预算让给 focus_asset。
- 现状：每资产预算仍由 `max_intents_per_asset` 硬拦；按资产的 token/时间预算尚未做
  （`llm_usage` 还没有 intent 维度，见模型分层/成本归因）。

### 新增：SRC 单元格租约（P2）

- 新表 `src_cell_leases`：同一 `(task, asset, risk_area)` 同时只允许一条意图在测。
- 租约在 `add_intent` 时占用（全有或全无）：同格已有意图时直接拒绝并说明持有人在测；
  不同风险面仍可并行。意图落库后绑定 owner_intent_id，创建失败回滚占位租约。
- worker 结束时释放（正常/异常/被 kill 都走同一 defer）；worker 活动时续租，
  过期由 TTL（20 分钟）兜底。
- `src_state` 与 `graph_overview.src` 新增 `leases` / `leased_total`，planner 提示词
  明确"这些格先跳过，别换措辞重复派"。
- 回归：租约存储（占用/繁忙/全有或全无/bind/续租/释放/过期重占/占位回滚）、
  add_intent 同格拒绝与不同风险面并行。

### 新增：确定性只读探针（P2）

- 新增 `src_probe` 工具（planner/worker）：把重复的收尾动作从 LLM 回合里拿掉。
  - `paths`：内置 API 路径字典枚举（默认 200 条，可调），返回 paths/non404；
  - `js`：抽内联脚本、同 host 外链 JS、chunk 与 sourcemap；
  - `methods`：对端点测 GET/HEAD/OPTIONS 并记录 `Allow`；
  - `non404`：从该 host 的录制流量里取非 404 GET 路由，慢速复测 2 次。
- 结果 `metrics` 与 `src_mark_check` 同名，可直接登记收尾项；探针不自动点格。
- 只读：只发 GET/HEAD/OPTIONS；状态变更方法仍需 agent 在 guard 下显式执行。
- 执行层：走录制代理（请求进入证据链）、按 `mode_doc.rate_limit` 串行限速
  （默认 5 qps）、校验任务范围与作业时间窗；程序项目限速自动编译进快照。
- 新增 `srcprobe` 包与单测（路径/JS/方法/非 404、坏目标拒绝）；提示词引导
  planner/worker 优先用 `src_probe` 而不是重复跑 ffuf/curl。

### 新增：SRC 金标靶场（P1 评测基建）

- `srcbench/target/`：本地故意有漏洞的靶场（IDOR / 未授权 / 反射 XSS / SSRF /
  路径穿越 / 开放重定向 / 缓存投毒），只监听本机，SSRF 只代取 loopback；
  `go run ./srcbench/target -addr 127.0.0.1:18080` 启动。
- `srcbench/targets.json`：金标清单（类型 + 归一化端点 + 期望等级 + 预算）。
- `srcbench/score/`：把发现列表与金标对照，算 TP/FP/FN、Precision/Recall/F1、
  等级一致率、覆盖格/收尾闸完成率与 token/命中；支持 Markdown/JSON 输出。
- 靶场自检（每个金标漏洞真的存在）与打分器纯逻辑测试进 `go test ./srcbench/...`，
  CI 不需 LLM 或外部服务；真实靶场（Juice Shop/DVWA/vulhub）按 README 扩展。

### 新增：PoC 可执行化（P1）

- 交付包为每条进包发现增加 `attachments/<发现id>-<slug>/`：
  - `poc.sh`：curl 复现脚本（小正文内联 base64，大正文引用同目录 `step-N.body`）；
  - `request.http`：原始请求的 .http 形式；
  - `step-N.body`：原始请求正文字节；`README.txt`：执行边界与步骤清单。
- 只从 `proof` / `verification` 绑定生成；超过 2MB 的正文截断并在脚本/README 里告警。
- 同一份脚本放进 retester 的 `get_finding_retest_context`（`poc.curl` / `poc.http`），
  独立复验"执行的就是报告里那份 PoC"；脚本超过 96KB 时提示从交付包获取。
- 安全边界：脚本只发请求、不修改目标状态；README 明确只在授权范围执行、遵守限速，
  签名/时间戳可能过期；curl 不默认 `-k`（自签名环境自行加）。
- 回归：请求头解析（跳过 Content-Length 等）、脚本/HTTP/README 渲染、单引号 shell 转义。

### 新增：影响面/定级建议（P1）

- `findings` 新增 `cwe`、`cvss_vector`、`impact_scope`、`repro_env`、`test_accounts`；
  `report_finding` 接收并校验（CWE 格式、CVSS 3.0/3.1 向量、字段长度），非法直接拒绝。
- 服务端按 CVSS 3.1 规范计算 base score（只算 base metrics），与自报 `severity`
  比对：不一致时在返回里给 `warnings` 与 `cvss_score/band/severity_agrees`，
  **不阻断、不改等级**。
- 发现详情页展示 CWE / CVSS 分数与一致性提示 / 影响面 / 复现环境 / 测试账号；
  SRC md 与 docx 报告头部同步输出这些字段（空值不占位）。
- 仍不自动定级：机器只搬运、校验、提示，severity 最终由人和平台裁决。

### 新增：平台结果回流（P1）

- 台账新增 `verdict_reason`（封闭词表：无法复现 / 已重复 / 信息不全 / 非漏洞 /
  超出范围 / 其他），`PATCH /api/src/submissions/{id}` 校验并落库；工作台驳回时可填。
- 新增 `SrcProgramFeedback` 聚合（已交/受理/驳回/重复/到账 + 驳回原因分布），
  平台项目列表与详情返回 `feedback`，工作台项目行展示历史成绩。
- 任务创建时把项目历史写进 `ProgramNote`：已交/受理/驳回/重复 + 前三大驳回原因 +
  一句优先规避建议（如"无法复现 → 提交前必须过独立复验"）。快照语义不变，改项目
  不影响已建任务。
- 台账状态真正推进到 `accepted` 时自动沉淀/更新打法卡片并记 `worked`；`rejected`
  时给同技术栈 + 同类型的既有卡片记 `failed`；`duplicate` 不计失败（洞是真的）。
- 不做平台 API 自动回填；结论仍由人/agent 在台账里推进。
- 回归：原因码校验与落库、项目反馈聚合、建议/反馈文案、资产指纹聚合；UI tsc 通过。

### 优化：语义去重（P1）

- **指纹 v2**：路径对象 ID（数字 / UUID / 长 hex）折叠为 `{id}`，`/user/123` 与
  `/user/456` 不再算成两个洞；漏洞类型走受控词表（`sqli` / `SQL注入` / `SQL Injection`
  归一为 `sql_injection`，越权/IDOR 归一为 `authorization`），未知类型退化为稳定 slug。
  指纹输入加 `v2|` 前缀，新旧口径不会半匹配。
- **降级指纹**：没有绑定流量时，用「受控类型 + 资产 host/路径 + 参数名」算 `d1:` 前缀
  的低置信指纹，存入 `src_finding_meta.degraded_fingerprint`。它只用于**疑似重复提示**：
  `src_dedupe check` 返回 `suspects`，`src_prepare_submission` 在 Note 里列出，
  不写 `dedupe_of`、不进交付门。
- 精确指纹仍只由「类型 + 归一化端点集合」计算；升级前已准备的台账指纹不重算（可能不再
  自动命中新指纹），新准备会写入 v2 指纹与降级指纹。
- 回归：ID 折叠/类型归一/降级指纹单测；PG 用例验证 degraded 字段落库、查询排除自己、
  且不会被精确查重命中。

### 新增：提交前独立复验（P1）

- medium+ 发现在 `src_prepare_submission` 准备交付件前，必须有一次
  `finding_retests.verdict=reproduced` 的独立复验；复验由 retester agent 在干净会话里
  只按原始证据做最小重放（复用现有复测链路，不新建子系统）。
- 第一次准备会自动发起复验并落 draft（issue 写清会话号与下一步）；等结论 reproduced
  后再准备一次才会 ready。已有 `fixed`/`inconclusive` 结论不自动重试，避免每次准备都
  烧一轮复验。
- 开关：`mode_doc.require_retest` 默认 true；program 规则 `require_retest:false` 可显式
  关闭（编译进任务快照）。
- `src_state` 的 doc 块与 worker/planner 提示词同步说明；`src_prepare_submission` 工具
  描述补上复验要求。
- 回归：复验状态判定（reproduced/active/fixed）、RequireRetest 默认与 program 关闭。

### 新增：收尾项指标的流量核验（P0-7）

- 新增只读核验器：从录制流量推导 `paths / methods / js / sourcemap / non404 /
  retested`，与 `src_checks.metrics` 的自报值比对；**只在自报 > 实测时告警，不阻断**。
- `src_mark_check` / `src_state` 的收尾项会带 `observed_metrics` 与
  `verify_warnings`；任务 SRC 页签在收尾闸卡片下方展示告警。
- 告警措辞明确说明录制关闭/MITM 透传会让实测偏低，避免把"没录到"误判成"没测"。
- 流量侧新增 `Traffic.Since(host, since, limit)`；核验结果按 (task, host) 做 30s
  短缓存，避免同一快照内重复扫描。
- 回归：纯判定核、资产 host 解析、流量指标推导、摘要视图保留告警。

### 优化：src_state 摘要视图、收尾进度上列表、docx 提交块

- `src_state` 默认返回摘要（计数 + top20 缺口 + 每资产进度），`detail=true` 才给逐格矩阵；
  按资产/面过滤时同时裁 `cells`/`checks`/`gaps`，并保留 `summary`/`finishable`/`doc`（之前会丢）。
- `graph_overview.src` 补 `focus_asset`、`checks_total/done`、`checks_by_key`、`suspicious_na`——
  提示词里让 planner "先清零 focus_asset"，静态上下文里终于有这个字段了。
- 收尾门把「面 x/y、闸 x/y、缺口数」写回 `tasks.src_*`，任务列表零成本显示收尾进度。
- 【提交信息】块改为 `SrcInput.SubmitBlock` 统一渲染，md 与 docx 同源；严格版式只丢元数据备注、
  保留交付告警。
- 新增测试：`src_checks` 存储层与收尾门集成（PG，CI 真跑）、摘要/过滤形状、docx 提交块同源。

### SRC 覆盖的第二层：收尾闸 + N/A 语义 + 红线 + 交付校验（F1–F4）

把 src-dig 技能的范围约束从"文档口径"落成工程约束。技能的一句话是"缺项 = 没测"：
`src_cells` 只回答"这个风险面测过没有"，本次补上"测够没有"。

- **F1 收尾闸**：新表 `src_checks`（任务 × 资产 × 收尾项，只存 `done/na/budget_stop`），8 项目录
  （JS 抽全 / 路径枚举 / 非 404 复测 / 方法矩阵 / 参数变体 / 防护对照 / 判死三条件 / 截图），
  `done` 必须带达标数字与证据节点，数字不够时错误直接写"`paths=37 < 200`"。
  新工具 `src_mark_check` + `POST /api/tasks/{id}/src/checks` + 任务页「收尾闸」卡片。
- **N/A 语义**：`src_cells.na_code` + 11 个理由码的按面白名单（`no_input` / `no_exec_sink` /
  `no_login_entry` …），把"没这个面"和"没测"分开；理由码填错面直接拒绝。
- **类型矩阵**：按技能补细分项（HQL·SpEL / ES DSL / XPath·LDAP / 对象图 / reset·rebind·2FA /
  privilege·money / template·expression·ws-exec…），app/service 必做面补 `ssrf`、`rce`（四件套齐全），
  新增可选 `csrf` 面；CORS 明确不进矩阵。
- **F2 红线**：内建会话红线（禁 `/logout`、`/signout`、`/revoke`）编译成命令级策略规则，所有 SRC 任务自动带；
  最小伤害 8 条进 planner/worker 提示词。平台项目新增 `check_tier`、`check_thresholds`、`no_automation`
  （禁扫描器/全端口/字典爆破的命令规则）、`redlines`、`max_records_read`、`require_screenshots`、
  `strict_layout`、`egress_ip`、`test_accounts`；平台档把"路径 ≥200"换成"手工清单 ≥1"。
- **F3 交付校验**：唯一标识头收紧为按请求唯一的 7 个（去掉 `traceparent`/`b3`/`amzn` 这类链级头，
  原实现会误报）；新增超长签名头截断检测；`ValidateTitle`（≤25 汉字 / ≤50 字母 / ≤100 字、禁链接/编号/
  路径开头/METHOD 形式）；`CheckReportMarkdown` 对成品再查 Host、整行省略号、跨块重复 id、包长；
  正文没内联时补 `[中间无关请求内容已省略]`、超 100k 自动中段缩减；`.md` 导出 CRLF；
  绑定项目时正文前生成【提交信息】块。
- **F4 节奏**：`Report.focus_asset`（一种子闭环：先把当前资产清零）与 `suspicious_na`
  （四件套全 N/A 计数）进态势与提示词，只影响排序/告警，不新增阻塞。

> 行为变化：app/service 必做面 8 → 10；`na` 必须给理由码；新任务在收尾项清零前不能 done
> （出口仍是 `skip_check_gate`、`check_tier=off` 与人工 force-finish）。
> 仍未验证：DB 集成测试（本机无 PostgreSQL）、截图生成、定级自动判定——见
> [docs/src-dig范围约束融合.md](docs/src-dig范围约束融合.md) §11。

### 文档：src-dig 范围约束融合方案

把 `~/.claude/skills/src-dig/` 里**可判定**的范围约束对齐进 BLADEPRO 的 SRC 模式，落成实现契约：

- [docs/src-dig范围约束融合.md](docs/src-dig范围约束融合.md)：技能文件 → 机制的映射表（覆盖 / 红线 / 交付 / 节奏
  四类）、数据模型（`src_checks`、`src_cells.na_code`、`mode_doc` 与 `program.rules` 新字段）、
  收尾闸 8 项判定口径、N/A 理由码白名单、门逻辑、F1–F4 阶段与 8 条验收场景、不做清单（白盒/截图生成/自动定级）。
- [docs/平台规则模板.md](docs/平台规则模板.md)：字节系 / 京东系 / 通用三份可直接粘贴的 program JSON，
  标注建档日期与"以当日规则页为准"。

关键修正（相对现状）：收尾闸（JS 抽全/路径≥200/非404复测/方法矩阵/参数变体/防护对照/判死三条件/截图）
是技能里"测够没有"的第二层，当前只做到第一层（面覆盖）；`na` 只校验原因、不校验是否满足"无入口"；
唯一标识头清单误收链级头（`traceparent`/`b3`/`amzn`）会误报。这些都在融合文档里给了具体改法，标为 F1–F3。

> 本文档阶段不含代码改动；当前生效行为仍是 P0–P3。

### SRC 平台面（P3）：平台项目、规则编译、看板

一个 program = "某个平台上的某个项目"。任务创建时选它，规则在创建时**编译成快照**，
之后改项目不影响已在跑的任务（与 P20 策略快照同一语义）。

#### 新增的功能

- **`src_programs`**：范围说明、规则（JSONB）、限速、作业时间窗、等级映射；
  `tasks.src_program_id` 与 `src_submissions.program_id` 记录归属。
- **规则编译**（`server/src_programs_api.go` + `srcmode.Program`）：
  - 禁用手段/敏感写操作 → 与用户覆盖层**取并集**进探索策略（平台规则只能更严）；
  - 额度（每轮/并行/总意图）→ 取更小值；
  - 命令级规则 + 限速生成的硬规则 → 追加进策略的自定义禁止条目；
  - 必做面、`allow_budget_stop`、`skip_report_gate`、每格尝试上限 → 覆盖 `mode_doc` 默认值；
  - 平台/项目名与一行规则说明（`program_note`）写进模式快照 → 进 planner/worker 提示词。
- **限速编译**：`rate_limit > 0` 时生成三条命令级规则（禁 `--flood`、`-t/--threads ≥ 50`、
  高频 `--rate/--min-rate`），前缀为清晰的拒绝说明。
- **时间窗**：支持 `09:00-18:00`、分段、跨夜；创建时校验，`InWindow` 可判定。
- **等级映射**：准备交付件时把内部等级映射成平台等级写进台账 `platform_level`。
- **看板**：`GET /api/src/stats` 聚合 SRC 任务数、台账按状态/等级、中危+ 发现与报告齐备数；
  新页面 **SRC 工作台**（侧边栏）含「提交台账」与「平台项目」两个 tab。
- **创建任务**：SRC 模式下可选绑定的平台项目；选了项目但没给 mode 时按 SRC 处理。

#### 说明

- 时间窗是项目级 + 提示词级约束；硬拦截复用全局作业时间窗。限速只硬拦最常见的洪水开关，
  其余靠提示词——"假装能拦全"比不拦更危险。
- 单元测试覆盖：项目校验、规则收紧、限速规则命中/不误伤、时间窗（同日/分段/跨夜）、等级映射。

### SRC 交付闭环（P2）：台账 + 证据合规 + 跨任务去重

P1 让任务"测完"，P2 让任务"交得出去"：每条中危以上的发现都要有齐备的可提交件，收尾门
一并判定。

#### 新增的功能

- **提交台账 `src_submissions`**：粒度为「一条发现 × 一个平台」。状态机
  `draft → ready → submitted → accepted | duplicate | rejected`、`accepted → paid`、
  任意 → `withdrawn`；`submitted` 必须有 `external_id`，`duplicate` 必须先登记 `dedupe_of`。
  已交出去的行不会被"重新准备"打回 draft。
- **发现元数据 `src_finding_meta`**：取证指纹、合规结果（JSONB）、`report_ready`、`dedupe_of`。
- **证据合规 `srcmode.CheckCompliance`**：中危以上必须有 proof/verification 绑定；
  `Content-Length` 不得大于实际正文字节数（chunked/gzip 跳过）；`x-request-id` 等标识头
  不得跨步骤重复；请求主机必须在任务范围内（判定不了的 scope 不诬告越界）；响应不得全空。
- **正文门 `srcmode.ValidateReportText`**：描述/危害/修复必须写全，出现「待补/TODO/占位」
  直接拒绝并说明缺哪一段。
- **跨任务去重**：指纹 = 漏洞类型 + 归一化端点（复用 `report.Fingerprint`）。命中会写
  `dedupe_of` 并把 `delivery/duplicate` 顶到收尾门，必须定案（台账标 duplicate 或
  `src_dedupe clear`）才放行。
- **收尾门扩展**：`CheckFinish` 增加交付面缺口 `report_missing` / `duplicate`（`mode_doc`
  可用 `skip_report_gate` 关掉）；`Report` 增加 `findings_medium_plus` / `reports_ready`。
- **agent 工具**：`src_prepare_submission`（正文 + 合规 + 查重 + 落台账，判定实现在宿主，
  与 HTTP 面同一份）、`src_dedupe`（check/mark/clear）。
- **HTTP**：`POST /api/findings/{id}/src-submission`、`PATCH /api/findings/{id}/src-dedupe`、
  `GET /api/src/submissions`、`PATCH /api/src/submissions/{id}`。
- **导出面**：`buildSrcInput` 优先读台账里写好的标题/描述/危害/修复（没有台账时保持原行为）。
- **批量包**：`提交说明.md` 增加「提交台账」一节，`submissions.json` 进 zip。
- **前端**：SRC 页签增加交付统计（中危+ 发现 / 报告齐备 / 待交付）、提交台账表格、
  「准备交付件」与「改状态」两个对话框。

#### 说明

- 没有绑定流量的中危发现会一直卡在交付门：没证据的发现不叫可提交件。补绑证据、推翻它，
  或人工放行——三条路都在界面上。
- P3（SRC 平台规则/项目/看板）仍是路线图。

### 项目改名 BLADEPRO：从「全链渗透」到「SRC 挖掘」

本仓是 [BLADE](https://github.com/lin9527ya/BLADE) 的 SRC 分支：引擎同源，任务模式不同。
BLADE 继续专做渗透（打深、拿据点），BLADEPRO 落 `tasks.mode="src"`——目标函数从「证明目标、
走完攻击链」换成「把覆盖矩阵的空格清零，并产出可提交件」。

#### 新增的功能

- **任务模式**：`tasks.mode` / `tasks.mode_doc`（创建时快照，运行中只读），创建任务接口与
  任务 DTO 暴露 `mode`；`mode=""` 的任务行为与改造前**完全一致**（默认值、无副作用）。
- **显式覆盖格 `src_cells`**：`(task, asset, area, item)` 唯一，只存四个终态
  `tested_found / tested_clear / na / budget_stop`。空格不预填，靠「范围内资产 × 必做面 −
  已有终态」现算，避免资产 × 面 × item 的行数在创建时就爆炸。
- **风险面 taxonomy**（`srcmode` 包）：13 个粗粒度、可判定的面（unauth/authz/injection/
  ssrf/xss/rce/cred/paths/session/upload/logic/host/takeover），按资产类型给出必做面；
  `required_areas` 可覆盖、`hard_items` 可要求细分项逐个点终态。
- **agent 工具**：`src_state`（读矩阵/缺口）、`src_mark_cell`（点格，终态证据当场校验）、
  `src_finish_check`（收尾门预检）。只在 `mode=src` 时按角色追加，**不进 tools 表**——
  `wireTools` 会把 DB 绑定的工具重新注入，seed 进去就会泄漏到非 SRC 任务。
- **规划层改造**：`graph_overview` 新增 `src` 块（`gaps_total` / `gaps_by_area` / `top_gaps`
  ≤10 / `finishable`）；planner 与 worker 的 system 各追加一段 SRC 目标函数与纪律。
- **engine 收尾门**：planner 判 `met` 后不直接落 done，先跑 `srcmode.CheckFinish`；有缺口则
  拒绝 done、写时间线、把缺口摘要推给下一轮（同一份缺口只推一次），连续 3 次同一份缺口未清
  零转 `policy_blocked` 交人工（新增中断原因 `src_gate_blocked`）。
- **兼容 goalless 分支**：SRC 任务即使目标全部 met 也不走「无目标即收尾」的早退，继续让
  planner 补格——否则收尾门会被这条捷径绕过去。
- **HTTP 面**：`GET /api/tasks/{id}/src`（矩阵+缺口+终态）、`POST .../src/cells`（人工点格，
  同一套校验）、`POST .../src/force-finish`（人工放行，必填理由，落审计活动）。
- **归档/恢复**：`task_archives_restore` 的显式列清单带上 `mode` / `mode_doc`，恢复后模式不丢。

#### 说明

- 本仓改名 BLADEPRO：Go module `github.com/lin9527ya/bladepro`、二进制 `bladepro`、
  环境变量 `BLADEPRO_*`、Docker 镜像/服务名与 UI 文案同步；数据库表结构新增列全部带默认值，
  旧库启动即迁移。
- 本版实现方案文档的 **P0（模式骨架）+ P1（覆盖矩阵与收尾门）**；P2（提交台账/证据合规/
  跨任务去重）与 P3（平台规则/看板）仍是路线图，见 `docs/SRC挖掘agent改造方案.md`。

### Worker 编号改为任务内序号

- 会话页的 `Worker #N` 不再用全局意图 id（任务 1 到 20，任务 2 会从 #21 继续），改为
  **任务内 1-based 创建序号**（按意图创建顺序）；`/api/exploration/intents` 新增
  `worker_seq` 字段，列表、会话标题、操作提示与确认框统一使用它，接口调用仍用真实意图 id。

### 指纹打法库：打穿一次，同类目标下次直接复用

#### 新增的功能

- **打穿自动沉淀**：worker 调用 `report_foothold` 拿到据点（shell/会话）后，自动唤起
  「打法沉淀」agent：读取该意图的完整执行过程与目标资产的真实指纹（technologies /
  favicon MMH3 / 服务端口 / 页面标题），提炼成一张**可跨目标复用**的打法卡片（识别线索 →
  验证 → 利用 → 落地 → 提权/横向 → 坑与失败分支），脱敏后入全局库。
- **指纹匹配与自动注入**：规划者/worker 的态势（`graph_overview`）新增
  `matching_playbooks`——按本任务范围内出现的技术栈/favicon 命中的历史打法（top 3）；
  `lookup_playbooks` 可按资产 id 或指纹取完整步骤。匹配是启发式打分（favicon 100、
  非通用技术每项 30、通用技术只做弱加分），**只有通用标签（nginx/php）不会单独命中**。
- **实战反馈闭环**：`record_playbook_feedback(worked|failed|inconclusive)` 累计成功率、
  刷新「最近验证」，检索结果按 指纹匹配度 → 成功率 → 最近验证 排序；同一指纹/手法的再次
  沉淀会更新原卡片（revision+1），不重复造卡。
- **「打法库」页面**：列表（标题/指纹/战绩/检索次数/最近验证/状态）、搜索与状态过滤、
  详情（Markdown 步骤与原始证据）、废弃（必须写理由）/恢复。

#### 说明

- 打法库是**全局**的（跨客户）：卡片记录来源客户与任务用于审计；提示词强制脱敏
  （不写凭据、token、cookie、客户域名/IP），路径与 payload 保留。
- 只沉淀 `confidence=high`（真实拿到据点、可复现）的打法；未确认的不入库。
- 存量库启动时自动播种 `playbook` agent、触发器与工具绑定；worker/planner/pentest
  的默认提示词各追加一版（可在提示词历史里找回旧版本）。

### 报告：写全利用细节（绝对路径、访问入口、命令回显）

#### 新增的功能

- **报告撰写模板升级**：默认提示词要求报告必须包含「利用过程（详细）」（按时间顺序，每步
  动作 → 请求/命令 → 回显 → 结论）、「关键位置与产物」表格、「执行过的命令与回显」、
  「清理与遗留物」。上传 webshell 这类落地物必须同时给出**目标上的绝对路径**与**访问 URL**、
  写入方式、权限与当前状态——只写"传上去了、能连上"不再合格。
- **上报侧补齐原始材料**：worker / 独立渗透 agent 的 report_finding 要求 evidence 写清
  目标、入口、绝对路径、访问方式、逐条命令与关键回显；落地文件同时用 report_artifact 记一条。
- **report_artifact 新增 `url`（访问入口）**：与 `locator`（目标上的绝对路径）配套；
  任务级 Markdown 报告同步渲染「访问入口」。
- **未确认的漏洞不再写报告**：`update_finding_report` 保存前校验确认状态——只有
  `confidence=high`、处置状态为「已确认」、或最近一次复测为 `reproduced`/`fixed` 才放行；
  已撤回/误报/已排除/重复一律拒写（处置结论优先于自评）。报告撰写提示词也要求先确认
  再动笔，未确认时如实说明缺口、不生成报告。

#### 说明

- 旧库启动时自动追加一版 reporter 提示词并切过去（`reporter_prompt_detailed_exploitation_v1`），
  旧版本保留在提示词历史里；report_artifact 的 schema 通过 `tool_schema_refresh_v10_*`
  刷新，绑定与开关不变。

## [0.5.1] - 2026-10-22

### agent 执行面降权（可选：`BLADEPRO_AGENT_USER`）

#### 新增的功能

- **agent 可以不再与服务端同权**：设置 `BLADEPRO_AGENT_USER=bladepro-worker` 后，Bash（含后台任务、
  交互式 shell）、长任务 `run_execution`、自定义工具都以该用户执行（`SysProcAttr.Credential`，
  只保留主组）；`jwt.key` / `config.json` / 数据库口令因此不再被一条提示注入就全部拿走。
- **子进程环境清洗**：`ANTHROPIC_*` / `OPENAI_*` / `BLADEPRO_*` / `AWS_*` / `GH_*` 及名字含
  `API_KEY`、`SECRET`、`TOKEN`、`PASSWORD`、`CREDENTIAL` 的变量不再继承；`HOME` / `USER` /
  `SSH_AUTH_SOCK` 等指向服务端用户的条目改写或剔除。
- **文件工具收口**：Read/Write/Edit/MultiEdit/LS/Glob/Grep 只允许 `data/`、skill 目录与
  `BLADEPRO_AGENT_READ_ROOTS` 内的真实路径（软链解析后再比对；隔离模式下 Grep 不走 rg 子进程）。
- `data/` 树启动时交给 agent 用户（目录 setgid + 组可写），run 目录 `0775`，agent 写自己的产物
  不受影响；`-data` 若包含密钥/配置目录则**拒绝启动**（否则降权是假的）。

#### 说明

- 未设置 `BLADEPRO_AGENT_USER` 时行为与之前完全一致（agent 与服务端同权），启动日志会留一行提示。
- 依赖 Norma 新增的 `tool.SetExecHook` / `tool.SetPathGuard`（v0.5.3）；Windows 不支持降权。

### 会话页：给运行中的 Worker 发提示（实时注入，不是暂停续发）

#### 新增的功能

- **运行中的 Worker 现在可以直接发消息**：消息在它**下一次工具调用之前**送达，并拦掉那一次调用、
  由模型据此改道——不打断、不丢已积累的上下文。此前只有两条路：先暂停再发（走 `runDetachedIntent`，
  语义是"续发"：这条 run 结束、消息作为下一轮输入重开一次，中间那次 run 白结束），或 `/btw` 旁路
  提问（只回答、不进 run）。实现上复用的是 planner 早就有的那条 steer 通道（`Engine.SteerWork` +
  `steerHooks.PreToolUse`），这次只是把它接到人工入口与 UI 上。
- **归属文案按来源分流**：worker 看到的是「【人工实时提示】…（这是人（操作者）对本意图的即时指令…）」；
  planner / 主 Agent 的 `steer_work` 仍是原来的「【规划者实时纠偏】…」，一字未改。"谁在下令"是 worker
  判断要不要推翻当前打算的依据之一，把人工提示写成规划者发的会让它误判上级。
- **独立留痕**：注入成功时落一条 `worker="user"` 的活动（会话页里正常显示成人发的消息），与
  「worker 真被拦下」那条 `PreToolUse` 记录分开——前者证明人发了，后者证明送到了。
- 输入框在运行中时给出发送键（输入 `/btw` 时让位给旁路提问键，暂停键保留），placeholder 与 toast
  按状态分流。

#### 说明

- **投递只在内存里**：这条 run 若在下一次工具调用之前就结束（或进程重启），消息不会送达。此时接口
  不做静默排队，只在"压根没有在跑的 work"上如实回 409，让用户重发。要"一定不丢"，得再加一层持久化
  的待投递队列（下一条 run 领到该意图时先注入）。
- 已暂停的 Worker 仍是原来的续发路径，行为没有变。

## [0.5.0] - 2026-10-20

### 更名与对外标识去特征

#### 变更

- **项目对外标识全面换新**：仓库名、Go 模块路径、可执行文件名、环境变量前缀、界面显示名一次换完
  （567 个文件），目的是**不留暴露用途与出处的特征**，同时满足"被扫到也认不出是什么"的那半边。
  · 仓库改名（GitHub 会重定向旧链接；**Releases 跟随仓库**，所以一键更新仍然可用——已部署的
    旧版本走的旧路径会被 302 到新仓库）。原作者留下的 `upstream` remote 一并移除（那个仓库早已不可达）。
  · Go 模块路径改为 `github.com/lin9527ya/bladepro`（185 个文件）；入口目录 `cmd/bladepro`。
  · 环境变量前缀统一为 **`BLADEPRO_*`**（`BLADEPRO_PG_DSN` / `BLADEPRO_LLM_*` / `BLADEPRO_SCOPE_ENFORCEMENT` /
    `BLADEPRO_KILL_SWITCH` / `BLADEPRO_TAG` / `BLADEPRO_CONFIG` / `BLADEPRO_SKILL_DIR` / `BLADEPRO_BTW_MAX_OUTPUT_TOKENS`；
    前端的 `AUTOPENTEST_API` → `BLADEPRO_API`）。**旧前缀不再兼容**——升级时要改自己的 `.env`
    与 systemd unit（`deploy/bladepro.service` 已同步）。
  · 可执行文件改为 `bladepro`（`start.sh` 的 `BIN`、Dockerfile 的 `/app/bladepro`、
    `deploy/bladepro.service`、CI 的 dist 路径都同步）。
  · 界面：默认标题改成**中性**的 `BLADEPRO`（原来的标题会把用途写在 `<title>` 里，被扫到一次就等于
    告诉对方这台机器上有攻击平台）；图标与 logo 换成新的 `favicon1.ico`（16/32/48），
    旧的 `logo.svg` 删除。
  · `docker-compose.yml` 的镜像不再指向**上游作者的**外部镜像，改成 `build: .`（本地构建）；
    同时修掉上一版 ports 段的 YAML 缩进错误（会让 `docker compose` 解析失败）。
- **数据库**：新装默认用 `bladepro` 用户与库（`install.sh` / `docker-compose.yml` 的默认值）；
  本机已存在的库已迁移（备份 → 以旧库为模板建 `bladepro` 库 → 指向新库），旧库暂时保留以留回滚余地。
- **未改**（外部不可见，改它们只有迁移风险）：Go 包内的变量名与函数名里不含品牌；
  运行期数据目录仍是 `data/`；PG 数据卷名未变（只在 `docker volume ls` 可见）。

### 公网部署隐身与加固（默认不暴露 / 去指纹）

#### 变更（**默认行为变了**）

- **默认只绑 loopback**：`-addr` 默认从 `:8787` 改成 `127.0.0.1:8787`；Docker 镜像 CMD 的流量代理
  从 `:8788` 改成 `127.0.0.1:8788`；`docker-compose.yml` 的 8787 映射改成 `127.0.0.1:8787:8787`；
  `install.sh` 起 Postgres 改成 `-p 127.0.0.1:5432:5432`。
  · 理由：**测绘引擎（FOFA/Shodan/ZoomEye/Censys）收录的前提是"扫到你的端口"**，所以默认不暴露
    是唯一有效的手段——要对外必须先显式写出来。此前照文档 `-addr :8787 -proxy :8788` 部署就是全暴露，
    而 Docker 镜像更把流量代理绑成 `0.0.0.0:8788`。
  · **本机自用不受影响**（本来就是 127.0.0.1 访问）；从别的机器/局域网直连 8787 会连不上——这是有意的。

#### 新增的功能

- **开放代理护栏**：`go-mitmproxy` 的 Options 里**没有**来源过滤/认证 hook，所以流量代理一旦绑到
  loopback 之外就是个**无认证的开放代理**（任何人可借它上网，测绘引擎直接标 open proxy）。
  现在**默认拒绝启动**，要开放必须显式加 `-allow-open-proxy`；管理端绑非 loopback 时也会提示
  正确的暴露方式。判断放在 flag 解析之后、碰数据库之前。
- **`/api/health` 不再自报家门**：从「自报服务名与版本号」改成只回 `{"ok":true}`
  ——它免认证，原样返回等于公网上任何人请求一次就知道这是什么、什么版本。版本移到需要登录的
  `GET /api/system/info`（前端顶栏改读它）。
- **CORS 默认不发头**：此前无条件 `Access-Control-Allow-Origin: *`；单机自用平台的前端与 API 同源，
  根本不需要它，而"无脑全开放"既是可指纹特征、也把 API 暴露给任意网页的跨源读取。现在只对设置
  `cors_allowed_origins` 里显式列出的来源发（填 `*` 才是真全开放，得自己写出来）。
- **显示名可配**：设置 `site_name`（空 = 内置名）覆盖运行时标题——名字是低成本指纹。静态 HTML 里的
  名字是构建期常量（`web/src/config/app-config.ts`），要连它一起换掉得改那里重新构建。
- **`deploy/` 部署包**：`README.md`（两套方案 + 部署后自检清单）、`cloudflared.yml`（Cloudflare
  Tunnel：源站零入站端口，最隐身）、`ufw-cloudflare.sh`（只放行 Cloudflare 段，段从官方端点拉）、
  `nginx-cloudflare.conf`（CF 真实 IP + SSE 免缓冲 + 只接受 CF 来源）、`bladepro.service`（systemd 单元，
  与 start.sh 的 0/75 退出码约定配套）。README 的部署章一并改写（原来教人绑全接口）。
- 验收 accP42 + `listenIsLoopback` 单测。

#### 说明

- **公开 CA 的证书会进 CT 日志**（Cloudflare 边缘证书亦然）→ 用域名就必然域名公开；但**源站 IP 可以
  不公开**。所以推荐 Cloudflare Tunnel（源站零端口）或 CF 代理 + 防火墙只放 CF 段；源站证书用
  **Cloudflare Origin Certificate**（不进 CT），别用 Let's Encrypt。

### 出站产物语言（OPSEC）

#### 新增的功能

- **「发给目标的东西用什么语言」成为可切换的设置**：命令与参数、payload、落地的文件名与目录名、
  脚本注释——这些是**目标与它的日志能看到的**，与"界面语言"是两件事，所以刻意分开设置
  （耦合起来会出一个很隐蔽的错：切个界面顺手就改了出站内容）。
  · `artifact_language`：默认 `zh`（**不约束**，一个字符都不加——中文本身不是错，打中文站点时
    中文的探针参数、中文用户名枚举本来就该用中文）；切到 `en` 后，一段**code-owned** 的规约段随
    系统提示词下发（与 P20 策略段同一纪律：只能改设置，改不掉那段规约），要求出站产物一律 ASCII
    英文，并**给业务需要留门**——确需中文时照用，但要在意图或 fact 里写明理由，便于复盘时区分
    "业务需要"与"手误"。
  · 落点在 `deferredSystem`（四个 agent——planner/worker/mainagent/chat——的共同出 system 段处），
    一处覆盖全部；写错取值当场 400 且不改动已存值（存进去会被当成"不约束"静默放行）。
- **中文痕迹标注**：出站命令里出现**汉字**时，审批审计与审批卡上多一条「语言痕迹」的可检出性
  笔记——**只标注，不拦**（中文有时就是业务需要）。它走已有的 opsec 通道，所以报告/概览/工具/
  只读一览全部自动覆盖，不新增审计字段。
  · `opsec.Note` 新增 `Detector`（`""`=关键词匹配 / `"han"`=代码判定）：现有 `Match` 经
    `regexp.QuoteMeta` 只支持字面词，"含汉字"是字符类，塞不进去——而且"命中关键词"与"按字符集
    判定"是两种不同的判断，混在一个字段里读不懂。
  · 判**汉字**而不是"非 ASCII"：全角标点、emoji、重音字母都不指向任何母语，标它们只会制造噪声。
    命中时把**具体是哪几个字**写进回执（`本次命中：测 试`），而不是只说"含汉字"。

### 界面中英切换

#### 新增的功能

- **界面语言可切（中 / 英）**：右上角新增一个语言按钮（一键互切），「界面偏好」面板里也有同一行。
  选择存在偏好 cookie 里（与主题/字体同一套机制），刷新与重启都记得住；切换即时生效，
  并同步 `<html lang>`（读屏、浏览器翻译、`:lang()` 选择器靠它）。
  · **中文是源文，英文走词典**（`web/src/lib/i18n/en.ts`）：`t("prefs.title", "界面偏好")` 的
    第二个参数就是中文原文。这样不必维护一份与代码并行的中文表（那种表会漂移成"页面上是 A、
    表里是 B"），而且**英文缺条目时回落显示中文**，不会把 `prefs.themePreset` 这种内部键名
    印到界面上——缺翻译是个已知的中间状态，不该变成可见的故障。
  · 未引入 i18next 之类的依赖：本项目界面已经全是中文，需要的是"把中文翻成英文"的单向能力
    与一个开关，而不是从零组织的资源系统（CSAI 用的是 i18next + `data-i18n` 属性扫描，那是给
    多语言从零起步的项目用的）。
  · **本批覆盖**：右上角偏好面板（原为英文，已全部中文化）、侧栏导航与分组、搜索面板、顶栏
    语言按钮。其余页面文案（约 110 个文件）按页迁移中——**没翻到的地方显示中文原文**，
    随时可以继续补。

### 图数据摄入：agent 在目标里跑出来的枚举结果也能落进图

#### 新增的功能

- **补上"只有页面导入"那个缺口**：域内图（SharpHound）与云上图（IAM 授权明细 / K8s RBAC）
  此前只有页面/HTTP 一个入口——而现实里最自然的获取时刻恰恰是**打进去之后**：在域内机器上跑
  `net group /domain`、SharpHound，或拿着偷到的 key 跑 `aws iam get-account-authorization-details`。
  那时产物只能压进 fact 与执行台账，图还是空的，规划层也就看不到"从这点能走到哪"——
  而图上多一条边少一条边，直接决定下一轮派什么意图（同 P27/P29 战果层要解决的那件事）。
- 新增两个 agent 工具：`ingest_ad_data` 与 `ingest_cloud_data`（默认绑 planner / worker / mainagent，
  worker 是产出方）。入参是**文件路径（或目录）**与/或**内联 JSON**；回执说清导了什么、
  认出哪些高价值目标、哪些没建模，并指下一步用 `ad_paths` 读路径。
- **与页面导入同一份实现**：两个工具走的是同一条 `plan/apply` 路径（为此把两个 HTTP 处理器里的
  计划与应用各抽成一个函数）。页面能导什么、agent 就能录什么，图与口径不会漂移成两套。
- 它们不产生对目标的动作（读的是已经拿到的数据），因此不过 RoE/命令门；据此去打仍走既有的门。
  没有任务上下文时不放行——图数据总得挂在某张图上。

### 云上枚举结果导入（云原生面）

#### 新增的功能

- **把云上的身份与授权读成同一张图**：新节点 kind `cloud_object`（`payload.category` 分
  account / user / group / role / policy / service_account / cluster），吃两种**离线枚举结果**，
  按内容判、不按文件名：
  · AWS `aws iam get-account-authorization-details` 的输出——用户 / 组 / 角色 / 托管与内联策略、
    组成员、附加关系、角色信任（**谁可以 assume 它**）；
  · K8s `kubectl get clusterroles,clusterrolebindings,roles,rolebindings,serviceaccounts -A -o json`
    的输出——主体 → Role/ClusterRole 的绑定（ServiceAccount 按 `ns/name` 归一，
    `system:authenticated` 这类宽主体带 `broad` 标签）。
  · **平台不持有云凭据，也不该持有**：枚举在有凭据的那台机器上做（aws-cli / kubectl / ScoutSuite
    之类），平台只读离线结果。这既是部署现实（云凭据交给一个渗透平台保管，本身就是个新风险面），
    也是本项目唯一能端到端验证的形态（本机没有云 CLI、没有云凭据）。
- **与域内共用同一条路径算法**：云上关系**不新造边**——组成员是 `member_of`，策略附加/内联与
  K8s 绑定都落在 `can` 上（`attrs.rights` 写清 `attached` / `inline` / `assume_role` /
  `clusterrole:xxx`）。于是攻击路径视图零改动就把「谁能拿到 admin 策略 / 集群管理员」读出来了，
  域内与云上还能连成一条链（"从一台机器上的凭据到云上 admin 角色"正是要连起来看的那种路径）。
  · 管理员等价**只认一种写法**：AWS 的 `Action:* + Resource:*`、K8s 的 `verbs:* + resources:*`。
    不做"看起来很大"的推断（`iam:*` 之类是强权限但不等价于完全控制）——判宽了，高价值目标这张表
    就失去分辨力。
  · 路径起点收**用户与 ServiceAccount**（泄漏的 SA token 与口令一样常见），**不收角色**：角色是
    "代入的目标"，把它当起点会让"某角色挂着 admin 策略"这种一跳结论把真正那条路挤掉。
  · 未建模的东西**如实计数**（指向服务主体的信任、Namespace 对象…），不静默丢。
- 前端：任务的「攻击路径」标签页（原「AD 攻击路径」）里多一个「导入云上枚举结果」，
  与域内导入共用同一套预览/应用纪律与同一个界面组件。

### 事前可检出性（OPSEC 知识库）

#### 新增的功能

- **动手之前就知道"这一手会留下什么"**：新包 `opsec/` 是一份**保守的**可检出性知识库——端口扫描、
  爆破、LSASS 抓取、横向执行（PsExec/WMI/at）、DCSync、Kerberoast、目录枚举、下载执行、反弹 shell、
  读敏感文件、提权枚举、清理痕迹，各给出「留在哪（目标系统日志 / EDR / 网络侧 / 应用日志 / 本机痕迹）、
  具体信号（Windows 事件 ID、sysmon、auditd…）、预计可见度（低/中/高）、一句人话」。
  · 它是 P31（检测验证）的**另一半**：P31 答"这一手**被检出**了吗"（事后、有证据），这里答
    "**预计**会落在哪里"（事前、知识库依据）。措辞刻意分开——把预期读成实测正是本仓一路在防的读法。
  · **命中不了就明说没收录**，并写明"这不代表没有日志"。若返回空列表而不作声，读的人很容易把
    "没有提示"当成"没有日志"——那是这个功能唯一的、也是最危险的失败方式。
  · 不教规避：降暴露在本平台是另一套机制（授权范围、作业时间窗、三层拦截与人工审批）。
- **三个落点**：① 判定时随**审计**一起落库（`intercept_pending.audit.opsec_notes`），审批卡上直接
  显示"这一手会留下什么"——人做决定的那一刻最该看到它；② agent 工具 `opsec_notes`（规划/执行/主
  Agent 三面），挑手法、判断要不要先和蓝队打招呼时先查一眼；③ worker 提示词写明它与 P31 的分工。
- **只读一览**：系统设置「安全与策略」里列出整张表（按预计可见度从高到低），连同两条口径一起
  写清——「预计 ≠ 实测」「没收录 ≠ 没有日志」。不知道边界，人就会把"工具没提示"读成"这一步没日志"。

### 作业时间线

#### 新增的功能

- **把台账 / 审批 / 发现 / 战果 / 检测验证串成一条可交付的线**：`GET /api/tasks/{id}/timeline` 与
  导出 `…/timeline.md`。它是**读模型、不新增表**（某一段存一份就多一个会漂移的副本），默认只列
  **里程碑**，原始工具流水要 `kinds=all` 才带——一条线上九成是"第 N 轮工具调用"的话，客户看不到重点。
  · 每一格带状态（服务端翻译成"已取消/已撤回/未检出"）、判定来源与理由、以及指回原始记录的
    `ref_type/ref_id`；执行那一格带出取消理由，审批那一格带出"为什么放行/拒绝"（授权边界真的生效过的证据）。
  · 检测验证的三态各说各的（unknown ≠ 未检出），凭据只出指纹不出明文；截断取最新一段并如实报出条数。
  · 导出与页面**同一份装配**：客户拿到的那份不该和界面对不上。前端在任务详情新增「时间线」标签。

### 凭据可利用面

#### 新增的功能

- **凭据从"在手/掉了"变成"能据此行动"**：credential 节点 payload 增 `targets[]`（host/port/service/
  protocol，以及**每条目标自己的** verified/evidence）。**不给节点加顶层 verified**：验证是对某条
  目标的结论，不是对本体的结论——同一条口令在 A 机器能登、B 机器不能很常见。
  · 工具 `report_credential` 增 targets；新增 `verify_credential`（后来真的登成功了就补上，不新记
    一条凭据）。**声称 verified 却没 evidence 一律拒收**——它会被规划层拿去规划"直接用这条凭据横向"。
  · **明文只在受控入口出，且留痕**：新增 `db.CredentialFingerprint`（sha256 前 8 位），报告、概览、
    界面都只印指纹；节点接口下发的 payload 里 `secret` 被摘掉（换成 `secret_redacted` 标记）；
    要看原文走 `POST /api/credentials/{id}/reveal`（POST 而非 GET：有副作用——写一条"谁什么时候看过"）。
  · 规划提示词说明怎么按 targets 派意图：`verified: true` 的直接派"用它登 X 做 Y"，只有待验证目标的
    派一条**验证性**意图（成功就 verify_credential，失败如实记 fact）。

### 停机开关与作业时间窗强制

#### 新增

- **一键停机（kill switch）与作业时间窗的执行侧**：此前时间窗只在拦截层按调用判定，而且
  `scope_mode=off` 时**连它一起跳过**——"设了窗口却什么都没拦"。现在"停"有两层：
  拦截层管这一次调用放不放行，执行侧（`server/scope_enforce.go`）管整个平台还该不该跑。
  · **作业时间窗与 scope_mode 解耦**：窗口外硬拒（不再随模式降级）。到点由 scheduler tick
    暂停所有在跑任务、取消在跑的长任务，并在任务时间线留一句为什么停的。
  · **停机开关**：一条 API 立即全停（不等 5 秒 tick），带回执——谁、何时、为什么、停了几条，
    历史留 10 条。**解除不自动恢复任务**：恢复意味着平台重新对目标动手，那一下该由人按下
    （页面上有「继续全部暂停任务」）。环境变量 `BLADEPRO_KILL_SWITCH` 可强制停机：出事的原因
    可能就是平台自己，那时"从界面上关掉它"这条路本身不可信。
  · **停止状态下不起任何新工作**：不补位、不触发 agent、不跑计划任务——否则一个 5 分钟一次的
    计划任务，在停机一小时里会堆出十二条跑不动的任务。排队任务保持排队（位置不丢）。
  · 前端：设置页「停机开关（紧急停止）」卡 + 窗口执行状态；全局状态条（停机 / 窗口外 /
    窗口设置解析失败），任务详情这类全幅页也显示。验收 accP35。

### AD 攻击路径导入

#### 新增

- **BloodHound / SharpHound 采集结果导入任务图，并推出域内攻击路径**：一种新节点 `ad_object`
  （`payload.category` 分用户/组/机器/域/OU/GPO）+ 四条新边 `member_of` / `admin_to` /
  `session_on` / `can`；具体权限名（GenericAll、DCSync、CanRDP…）放在边上的 `attrs.rights`
  ——权限名是开放集合，每加一个就改列级 CHECK 是不可接受的。数据进的是**任务的探索图**，
  所以攻击路径视图、报告、图视图零改动复用（`server/attack_chains.go` 的"不引入新模型"）。
  · 导入契约照资产导入：`{task_id, files[]}`，预览只读、应用才写，两条路径同一份计划；
    节点身份是 **SID**（同一份采集导两次只合并、不新增），未采集的引用造**明确标记的 stub**
    （DN / 知名 RID / 域信任目标）而不是把这条边丢掉；ACE 只收"拿了这个能往下走"的白名单，
    跳过的按名字计数如实报出。
  · 路径重建（`db/ad_paths.go`）：**会话边反着走**（机器 → 账号：控住机器就能取上面那个账号的
    凭据，横向最经典的一跳），多源 BFS 取到高价值目标（DA/EA/DC）的最短路，默认起点是
    **非特权账号**——否则"DA 一跳走到 DA"会把真正那条路挤掉。任务页「AD 攻击路径」标签、
    报告 AD 段、agent 的 `ad_paths` 工具与 `graph_overview` 的 `ad_graph` 摘要**三处同源**。
  · 导入是数据摄入、不产生对目标的动作，因此不过 RoE/命令门；据此去打仍走既有的意图与命令门。
    验收 accP34。

### 战役层（P33）

#### 新增的功能

- **任务之上的归属与聚合**：`server/manager.go` 的注释一直写着 `Task is one engagement`，而真实
  红队作业的单位不是「一个任务」而是「一次作业」——一个客户、若干目标、一份交付物；跨目标作业此前
  只能靠人记住哪几个任务是一起的。新页「战役」：归属 + 聚合视图（技术覆盖、检测三态、战果计数）。
  · **刻意做薄**：只做归属与聚合，不做编排——依赖、顺序、调度仍全在任务层；一个任务至多属于一个
    战役（0/1，可空），"同一个任务算不算两次作业的一部分"是个没有答案的问题，允许 N:N 只会让人纠结。
  · **删战役只解绑、不删任务**（FK `ON DELETE SET NULL`），回执里如实说解绑了几个：任务是被归档
    与交付的单位，不该因为"把作业归错了组"而消失。
  · 归属走**声明式单路由** `PUT /api/campaigns/{id}/tasks`（一次给出应当包含的全部任务，多退少补
    由服务端算），比"逐个加/逐个删"少一半路由也更难用错；判重看归一化后的名字。
  · 聚合复用全局那几条判定（`db.TechniqueTally`、检测三态逐条读 state），不另写一套——否则战役
    视图与任务报告会报出两个不同的数字。

### 授权范围（RoE）可配置（P32）

#### 新增的功能

- **作业时间窗与空间门模式一起搬到系统设置页**：`intercept_scope_hours` 支持
  `09:00-18:00`、多段 `09:00-12:00,14:00-18:00`、**跨夜** `22:00-06:00`，空 = 不限时；
  区间左闭右开（"到 18:00"不含 18:00 那一刻起的动作），时区取本机。
  · 此前 `intercept_scope_mode` 只能改库或环境变量，而授权边界是客户验收时会核对的东西，
    藏在 settings 表里不合适——两者一起做成页面可配（单独给时间窗加 UI，会让更基础的模式开关
    反而更隐蔽）。
  · 落库**前**校验窗口：存进一条解析不了的，之后**每一次**工具调用都会落到人工确认上，而用户
    多半要等任务跑不动了才发现；当场退回并说清怎么写便宜得多。
  · 改完即时生效（拦截层每调用现读设置）。时间窗的**强制执行**（到点全停、与模式解耦）见上文的
    「停机开关与作业时间窗强制」。

### 检测验证 / 攻击路径 / ATT&CK 覆盖（P31 / P30）

#### 新增的功能

- **检测验证（P31）**：新节点 `detection`——一次进攻动作做完之后，防御侧有没有响。这是「平台」
  与「扫描器」的分水岭：只会打的是扫描器，能回答"这套防御拦不拦得住"的才是平台。
  · **最要紧的一条：`unknown` 必须独立存在**。「我们没看到」和「它没拦住」是两件事，把 unknown
    并进 `not_triggered` 就是把"日志没留 / 没权限看"读成"防御没拦住"——那给出的结论比不给更危险。
    这条纪律在六处一致：schema 三态 CHECK、工具枚举校验、概览三态分别计数、报告三态各自成词、
    报告末尾的防误读脚注、worker 提示词（并写明"环境里根本没有日志可查时，不要为了凑数去记"）。
    概览**不产生「检出率」**。
- **攻击路径（P30）**：报告的「攻击路径」一节由 `intent --uses--> 战果` 与 `intent --yields--> 战果`
  两种**早已记在图里的边**接起来读——不引入新模型。节点只取战果（findings/facts 是结论不是台阶，
  混进来路径会变成流水账），起点是"没有被任何一步产出的战果"（自己打下来的第一次落脚）；中途
  没善终**但只要有产出**就算一跳（产出是真的，与战果口径同一精神）。
- **ATT&CK 技术覆盖（P30）**：`add_intent` 新增可选 `techniques`（T1190 / T1552.001…），**只校验
  ID 形状**——查真伪要内置一份会过期的表，而形状合法但其实是错的 ID 读者一眼能看穿。非法项**丢弃
  而不是拒绝整条意图**（标注不是约束，标错一个 ID 不该让整条方向作废）。技术标在跳上而不是另起
  一表：「用 T1552.001 读了凭据、拿到 wp_user」才是一句完整的话。

### 战果层与战果轴（P27 / P29）

#### 新增的功能

- **据点与凭据成为一等公民（P27）**：两个新节点 kind `foothold` / `credential`，**复用既有的
  节点/锚点/边机制，不新造存储**（血缘、跨任务继承、概览都是免费的）。此前 agent 真打穿一条链
  （拿到 shell、读到凭据、横到第二台）之后，产物只能压成一段 fact 文本：规划层看不到"我有哪些
  据点、能横到哪、握着哪些凭据"，每轮都从外面重新打一遍，报告里的"提权/横向"也只能靠文案。
  · 工具 `report_foothold` / `report_credential`（worker + 主 Agent 两面；worker 是产出方，
    必须当场记），**故意比 `record_fact` 严一档**：summary / evidence / confidence 三者缺一不可
    ——战果会被规划层当作既定事实拿去规划，一条编出来的 shell 会让后续所有意图跑空、且看不出是
    哪里错的，所以宁可拒收。
  · 状态只有两态（在手 / 掉了）：战果的全部价值就在"现在还能不能用"，再多的状态只是要人维护、
    且没人会维护的字段。它们不进 cold-digest，所以不会被折叠吞掉。
- **战果轴：意图声明在动用哪条战果（P29）**：新增边 `intent --uses--> 战果`。planner 派意图时用
  `uses_loot_ids` 声明它在动用哪次已得的访问，`graph_overview` 据此算出 `outstanding_loot_total`
  并给每条战果打 `outstanding`。**这不是只改提示词**：planner 真正拿不到的信息不是"root 意味着
  什么"（那个它会推断），而是**"哪条战果已经被别的意图接手了"**——那是历史事实，不是推断。
  · **刻意不复用 `derived_from`**（语义上最接近的那条边）：删除意图时会沿 `yields/derived_from`
    做独占级联，而战果不在受保护集里，复用它会让"删掉一条用过凭据的意图"把凭据本身一起删掉
    ——战果是证据级数据。这一点在实验里验证过：临时改回 `derived_from`，测试立刻红（据点整个消失）。
  · **未善终的意图不算动用**（`blocked` / `exhausted` / `stopped` / `deleted`）：它们根本没把那次
    访问用出去，若就此把战果标成"已动用"，这条到手的能力会在图里静默烂掉（同 P24 的"没限住就要
    如实说"）。判定收敛在 `db.LootConsumingIntentState`，agent 与报告共用一份。
  · 报告战果段带出动用关系（「动用于：intent-12…」，到手但没用过的如实写「尚未动用」）——只列
    "拿到了什么"是资产清单，写清"拿它走到了哪一步"才是作业叙述。

### 联网搜索与 MCP 目录

#### 新增的功能

- **联网搜索新增 opencode / commandcode 两个后端**：都借用同名的 LLM 配置，模型固定
  `deepseek-v4-flash`（实测 `deepseek-v4.1-flash` 不执行服务端 `web_search` 工具，会返回 0 条）。
  opencode 走 anthropic 兼容通道 + `x-opencode-session` 路由头；commandcode 走它**原生**的
  `/alpha/web-search`（模型无关）。设置页每个后端带一句实测口径说明。
  · 「测试搜索」与线上工具**共用同一套后端解析**（此前各写一份，于是出现"测试通过、对话里
    `web_search` 不可用"这类假象）；面向 SDK 的后端名统一归一到 `deepseek`。
- **MCP 推荐目录**：MCP 页「推荐」按钮 → 常用 MCP 目录（Chrome DevTools / GitHub / semgrep /
  Burp / Shodan / Context7）→ 一键**预填**到添加表单，**不自动安装**。

### 自更新

#### 修复

- **私有仓库的更新下载走 API 资产端点**（v0.4.5）：实测 `browser_download_url` 即使带令牌对
  私有仓库也返回 404，`api.github.com/.../releases/assets/<id>` + `Accept: application/octet-stream`
  才取得到（302 到签名地址）。`Asset.DownloadURL()` 优先 API 端点、`get()` 统一带该 Accept 头；
  公开仓库行为不变。
  · 该缺陷只在"私有仓库 + 真点一次更新"时才暴露——此前的发布源常量指向一个已不存在的仓库，
    把整条链路的问题都掩盖了。**2026-10-15 已端到端演练通过**（v0.4.5 → 一键更新 → v0.4.6：
    读取 release → API 端点下载 → SHA256 校验 → 暂存 → 退出 75 → start.sh 拉起）。

## [0.4.3] - 2026-10-15

### 自更新

#### 修复

- **自更新补上 GitHub token 支持（发布源是私有仓库时必需）**：`selfupdate` 的发布源此前写死
  一个**已不存在**的仓库（GraphQL 查不到），而本仓当时还是私有仓库、
  updater 又不带凭据，所以更新链路必然 404。现在：发布源常量改为本仓（**仍是编译期常量、运行时不可配**
  ——"更新源可配 = RCE 通道"这条前提没动），凭据走新设置 `update_github_token`（只存不回显，
  设置页「更新」卡里有输入框，留空即不改，**现读现用、换令牌立即生效**）。
  · **令牌只在 GitHub 自己的主机上发送**（`api.github.com` / `github.com` / `raw.githubusercontent.com`）：
    下载会 302 到对象存储（`objects.githubusercontent.com` 等），把令牌转发过去等于交给第三方——
    这条边界由 `authTransport` 的主机白名单保证，并有单测钉住（含"未配 token 时一个头都不加"）。
  · 未配令牌时行为与从前一致（公开源照样能用）。

### 依赖与命名空间

#### 变更

- **模块路径全部改到自己名下，不再出现原作者命名空间**（本仓 192 个文件的自引用 + README/相关文档），
  norma SDK 的 fork 也把 module path 改成 `github.com/lin9527ya/Norma`（**v0.5.0**，
  该仓 93 个文件的自引用一并改完并已打 tag），于是本仓侧**不再需要 `replace`**——
  `require github.com/lin9527ya/Norma v0.5.0` 直接引。
  · 动机：路径写着上游名字时，人和模型读 `go.mod` 都会得出"代码来自原作者"（实际从
    2026-10-13 起就是个人维护线），这次事故就是这么被误读出来的。
  · 该 fork 是**公开**仓库，换路径不影响 CI/本地拉取，也不需要新增任何凭据。
  · `go.sum` 里的新条目由 `go mod tidy` 生成；旧路径的历史条目随 replace 一起消失。

### Agent 编辑器

#### 修复

- **网络搜索 / 交互式 Shell 两个开关改成「勾选即生效」**：此前它们要按上方「保存配置」才落库，
  而紧挨着的按钮是「保存为新版本」（只存提示词版本）——按直觉点后者时，勾选会被 reload 弹回未勾选，
  且**对话里 web_search 照样不可用、没有任何提示**（"没保存"与"保存了没生效"看起来一模一样）。
  现在与同页 MCP/技能可见性复选框同一套纪律：乐观切换 → 落库 → 失败回滚并说明。
  后端链路本身是对的（`agents.web_search` → DTO → `SetAgentWebSearch` → 对话侧按会话 Agent 门控），
  这次只改交互与文案（「勾选即生效」＋说明它仍受全局开关门控）。

### 资产页合并 / FOFA 检索导入 / 存储清理

#### 新增的功能

- **资产页合并成一张表（P28）**：此前 7 个标签各一张表（企业/根域名/IP/子域名/应用/服务/接口），
  现在 6 类资产共用**一张统一表**——类型降为列 + 筛选标签，DSL 搜索在「全部」档**跨类型**匹配
  （后端本来就支持：`QueryDSL/CountDSL` 的 `typ==""` 即全类型，只补了默认列表分支不再兜底成
  `root_domain`）。**企业不混进资产行**：它是「归属」，保留独立入口，在表里以归属列出现。
  顺带补上 **CSV 导出**（P26 只做了导入）：导出当前筛选的全部匹配（逐页取、封顶 5000 行并如实
  提示截断），列名用导入侧认得的口径，所以导出的文件可以直接再导入。
- **FOFA 资产搜索（P28）**：资产页右上「FOFA 搜索」——写 FOFA 原生表达式 → 结果表（列随请求字段）
  → 勾选 → **导入为资产**，走与 CSV 导入**同一套** preview/apply（按形状分类、**已存在只合并**，
  二次导入不新增）。三条边界照说：与 agent 的 `intel_search` 是**同一条执行路径**（同配额、同
  台账、同落盘），**只查不扩**（不自动入库、不动任务范围），端点（官方 / 企业版 / **第三方中转站**）
  与 Key 在「系统设置 → 情报源」一处配。
  · **中转站结构自适应**：部分中转站的应答与官方不同（结果在 `data.results`、计数叫 `total`、
    行是对象、错误用 `code!=0`）——归一化解析把四种差异收敛到一份结果，**解析不出来就报错**而不是
    返回空结果（把"结构不认识"当成"没查到"会让人以为目标不存在）；列名以应答给的为准，避免错位。
  · 导入映射按值分列：FOFA 的 `host` 常常是带协议的 URL，URL 进 `url` 列、其余进 `host` 列，
    端口只在值里没有时补（验收里踩到过 `https://x:8443:8443` 这种拼法，导入器正确地拒了）。
- **存储清理（P28，照 CS 的 Inspect → Clean 两段式）**：新页「系统 → 存储」——按分类体检
  （单元数/占用/将删/受保护）→ 每类设保留天数 → 试算（只读，**不动盘**）→ 执行（二次确认，删完
  重新体检）。**只删超过保留期、且不在跑的任务产物**：受保护集合取自 DB 里非终态的任务
  （不是文件时间启发式），执行前会**重新判定一次**，不是拿试算结果去删。保留天数默认全 0
  （= 不清理）——装上平台不会因为你没配就自己删东西。`traffic/` **只统计不清理**并在页面上写明
  为什么（`_blobs` 与 `_index` 是一套，绕过 traffic 包删除会把索引打烂）。

## [0.4.2] - 2026-10-14

> 本版包含原定作为 **0.4.1** 发布、但因 Windows 构建失败而未能发出的全部改动（见「构建」）。
> 0.4.1 因此从未发布，其 tag 已删除。

### 构建

#### 修复的问题

- **修复 Windows 构建被 P24 打断**：P24 的资源限额实现（`ulimit` 前导 + 取进程信号）整份放在
  一个带 `//go:build !windows` 的文件里，而 `execution.go` / `server.go` 是**无条件**引用那些
  符号的——于是 **Windows 交叉编译编译不过**。现在按平台拆开：类型与读设置留在平台无关的文件，
  `ulimit` 那套归 `*_unix.go`，Windows 补一份桩——**如实标注"本平台不支持、本次未限住"**
  （applied_* 全 false + Note 说明），而不是假装限住。这正是 P24 自己的纪律：探测不到就如实记录。
  - **这个断裂藏了一整个功能周期才暴露**：CI 的测试与构建都在 Linux 上跑，**只有 release 工作流
    跨平台构建**，而它只在打 tag 时运行。v0.4.0 是在 P24 落地之前打的 tag，所以上一次发布正常；
    **v0.4.1 是 P24 之后的第一个 tag**，于是第一次暴露——五个平台里 Windows 编译失败、其余四个
    被 matrix 的 fail-fast 连坐取消、`release` job 因 `needs: binaries` 被跳过，结果是
    **tag 有了、GitHub Release 却没建成**。

### 测试基础设施

#### 变更

- **CI 每次 push 都把五个发布目标各编一遍**（linux/darwin 的 amd64+arm64、windows/amd64）。
  此前这项检查只存在于 release 工作流里、且只在打 tag 时跑，平台相关的构建断裂因此能潜伏很久
  ——上面那条就是这么被藏住的。现在 push 即暴露。
- **CI 的测试加了 `-race`**：本仓的 agent 包有 9 个包级可变函数变量（由 server 启动时赋值、无锁），
  测试里也有手工改它们再回滚的写法；此前 CI 不跑竞态检测，将来一旦某个测试同时用上并发子测试，
  只会表现为「偶发红」而没人能定位。现在这类缺陷会当场可见。代价：全量测试约 57s → 107s。

### 技能清单与 frontmatter 安全

#### 修复

- **SKILL.md 的 frontmatter 写入前先体检，不合格就拒绝——不再静默改坏文件**：真实事故
  （`skills/scopesentry/SKILL.md`）里那份文件漏了收口的 `---`，于是「第一个 `---` 到下一个 `---`」
  把 30 行正文卷成了 frontmatter；用户在页面上勾一次**关联 MCP**，元数据写入器就把这段按
  `key: value` 重排——空行、JSON 缩进、`http://<主机>` 里的 `://` 全被改坏。**一次正常的界面操作，
  静默把技能文件改坏**，这是本次堵的洞：
  · 新增 `server/skill_frontmatter.go`：改写前确认前导块确实「形如 frontmatter」——每个非空行
    要么是注释、要么是 `key: value`（键为普通标识符，值里允许冒号：`allowed-tools: Bash(npx:*)`
    这类必须通过）。代码围栏、正文句子、块状列表、`## …` 标题、超过 40 行的前导块，一律判不合格，
    返回 400 并**带行号与原文说明原因**，同时点明「文件没有改动」与出路（文件编辑器是逐字节保存的，
    畸形文件照样能手改）。不合格时一个字节都不写。
  · 技能清单如实标注：`meta_error`（前导块不合格——元数据改动会被拒）红徽标 + 详情面板警示带；
    `meta_warning`（缺 `name`/`description`）琥珀提示 + 详情面板，并给一个「打开 SKILL.md」直达按钮。
  · 上传与新建保持宽松（先装进来），装完清单会如实标出来；块状列表这种写入器本来就处理不了的
    写法也会被明确拒绝并给出等价单行写法，而不是改坏。

### MCP 工具级开关与工具明细

#### 新增的功能

- **MCP 工具可以逐个开关了（P25）**：此前 MCP 的授权只有「整台服务器 × Agent 可见性」——
  一个 server 里只要有一件工具不想让模型用（写操作、只读副本、调试用工具），只能整台服务器停用。
  现在 MCP 页右栏的**工具列表每行一个开关**：关掉的工具**不再注入任何 Agent 的工具面**
  （全局生效，与 Agent 无关；直接可见的全局块与技能解锁两条注入路径同时失效）。
  - **人的开关活过重发现**：刷新工具列表、启动自动发现都会重建缓存，但开关会按工具名保留——
    否则每次刷新都悄悄把工具放回去，这个开关就成了摆设。新发现的工具默认启用；
    工具从 server 上消失再回来 = 新工具，重新默认启用。
  - 缓存里仍是全量工具（开关是标记不是删除）：列表行显示「4 个工具 · 1 停用」，
    右栏里停用的行变灰 + 「已停用」徽标；右栏展示去掉 `mcp__<server>__` 前缀（server 已是页面主体）。
  - API：`POST /api/mcp/{id}/tools/toggle`（名字不在缓存里 → 404 说清楚，不静默成功）；
    `GET /api/mcp/{id}/tools` 每行带 `enabled`，`GET /api/mcp` 带 `tools_disabled` 计数。
  - **工具行可展开参数表**：发现时把每个工具的 `inputSchema` 一并缓存（`mcp_tools_cache.schema`
    列本来就预留、只是从没人写过），右栏工具行点一下展开「参数 / 类型 / 必填 / 说明」（array<object>
    的 items 平铺成子行），不用为了看一眼参数去连外部 server，「刷新」时才重新发现并更新 schema。
  - 验收 accP25（清单 20/20：假 MCP 两个工具 → 关一个 → 工具面里真的没了、另一个不受影响 →
    刷新后仍是关的 → 列表/工具列表/回执三处口径自洽 → 未知名字 404 → 工具 schema 随缓存返回）。

### 界面

#### 变更

- **居中弹窗整体加宽**：上一轮改完后弹窗偏窄（`sm:max-w-md/lg/xl` 在宽屏上显得局促），按内容重新分配
  宽度——单列表单类（MCP 添加/编辑、LLM 轮询、资产新增企业、任务内新增测试资产、拦截两条规则编辑器
  与拦截范围）从 448–576px 提到 **672px（2xl）**；带双列栅格的表单（通知渠道、LLM 模型配置、新建 Skill）
  提到 **768px（3xl）**；只读明细/文件编辑（覆盖图节点详情、工作区文件）提到 576/768px；
  宽内容类（命令执行详情、流量记录详情、任务分类管理、任务模板管理、系统工具编辑器）提到
  **896px（4xl）**；最宽的 Agent 编辑器与自定义工具编辑器提到 **1024px（5xl）**。
  只改宽度类，骨架、字段与行为未动；新建任务弹窗（4xl）是单列长表单，保持原宽。

#### 变更

- **全站的右侧抽屉统一改居中弹窗（收口）**：继工具/MCP/LLM/Agent 之后，把剩下所有「点一下从右边滑出」
  的界面都改了——**拦截与审批**（命令拦截规则、资产拦截规则）、**通知推送**（新增/编辑渠道）、
  **任务**（分类管理、新建任务、计划任务、任务模板管理）、**资产**（新增企业、任务详情里新增测试资产）、
  **命令**（工具执行详情）、**流量**（请求/响应记录详情）、**工作区**（文件预览/编辑）、
  **技能**（新建 Skill）、**覆盖图**（节点详情、折叠分组）。全部统一为「头固定（border-b）/
  内芯 flex-1 min-h-0 滚动 / 底部操作条固定」的居中弹窗，宽度从原来的 30–48vw 抽屉换成
  内容尺寸（`sm:max-w-md`～`sm:max-w-4xl`）。字段、校验、API 与动作按钮一行未动；
  `ProfileSheet`/`PoolSheet`/`CategoryManagementSheet`/`ScheduleTasksSheet` 这些名字也跟着改掉
  （`schedule-tasks-sheet.tsx` → `schedule-tasks-dialog.tsx`），免得下次按名字去找滚动锁。
  现在应用里只剩移动端侧栏（`ui/sidebar.tsx`）还是抽屉——那是导航，不是功能面板。

#### 变更

- **LLM 与 Agent 的编辑器也从右侧抽屉改成居中弹窗**（与工具页、MCP 页同一改法）：模型配置
  （`ProfileSheet` → `ProfileDialog`，`sm:max-w-xl`）、LLM 轮询/故障转移（`PoolSheet` → `PoolDialog`，
  `sm:max-w-lg`）、Agent 编辑器（45vw 抽屉 → `sm:max-w-4xl`，6 个 tab 的工具/技能/MCP 列表更宽了）。
  一律「头固定（border-b）/ 内芯滚动 / 底部操作条固定」，字段、校验、API 与各自动作按钮一行未动；
  组件名跟着改掉，免得下一个人按名字去找滚动锁。Agent 的深链整页编辑器（`/system/agents/detail`）
  本来就不是抽屉，保持不变。

#### 变更

- **技能页补上「找得到」和「看得懂」两件事（骨架不动）**：与 CyberStrikeAI 的技能页逐项比过之后
  的结论是**不换骨架**——本系统是「技能库管理台」（调用排行/未使用/未命中缺口、按 Agent 可见性、
  常驻技能、包内增删文件、zip 上传），CS 是「技能文件浏览器」（卡片列表 + 弹窗里只能改正文）。
  只把 CS 确实更顺手的三处搬了过来：
  · **左栏搜索框**（本地过滤，零后端改动）：按技能名 / 描述 / 任意文件名命中，显示「N / M 个技能命中」，
    无命中给一句话空态；只筛行——不动展开态、也不清空已选中的技能（编辑到一半不该被搜索框踢走）。
  · **一眼可见「有没有人用得上」**：技能行 tooltip 带描述 / 文件数 / 可见 Agent 数；**一个 Agent 都
    没授权的技能挂一枚灰色「未授权」徽标**——本机 4 个技能里就有 3 个谁都调不到，这比总览里的
    「未使用」更靠前、更可行动。
  · **markdown 渲染预览**：`.md` 文件的编辑器头部多一个「预览渲染」（复用 `agent-editor` 的同款
    模式与共用 `<Markdown>`），渲染的是编辑器里的**当前内容**（含未保存改动），别的文件不显示该按钮。
  · 没搬的：服务端搜索/分页（一次全量拉取，量级不对）、卡片网格+弹窗编辑（会把包内编辑能力砍掉）、
    CS 自己的 version/tags 字段（本系统跟 agentskills.io 规范）、摘要优先加载（本地 API 一次读全）。

#### 变更

- **工具编辑器与 MCP 管理页照 CyberStrikeAI 重排（纯布局，零 API 改动）**：
  · **工具页**：点系统工具 / 自定义工具此前从**右侧抽屉**（30vw / 45vw）弹出，现在改成**居中弹窗**
    （`sm:max-w-3xl` / `sm:max-w-4xl`，≈768/896px），头固定、内部滚动、底部保存/删除条固定——
    与 CS 的编辑弹窗骨架一致，14 组字段的自定义工具表单不再被挤成窄条。字段、校验、API 与
    「系统/自定义」的分派逻辑一行未动。
  · **MCP 页**：从「4 列卡片网格 + 点击开抽屉（配置/工具列表 两个 tab）」改成**满幅主从两栏**
    （照 CS 的 MCP 管理页）：左栏是服务器列表（可点选行 + 总数/启用/停用/熔断统计 + 添加按钮），
    右栏是选中 server 的**完整明细**——连接信息（命令/参数/URL/请求头，密钥只显示键名）、
    熔断与并发（P24 状态 + 手动重置）、工具列表（**前端搜索过滤** + 刷新）、按 Agent 可见性勾选；
    启用开关、编辑、删除都收到右栏顶部，列表行保持只读不重复控件。**删除此前点了就删，现在有二次确认**。
    添加/编辑仍是 7 个字段的居中弹窗；窄屏下两栏塌成单列（列表限高滚动）。
  · 两页的 Sheet 抽屉已全部移除（`SheetContent` 计数 0）；MCP 的工具列表查询只读平台缓存，
    选中即显示，不会为了看列表去连外部服务器（刷新按钮才真连）。

#### 变更

- **「系统」侧栏从 11 个标签收敛到 6 个**，并把拦截三页合并成一页：
  · **能力与扩展**（可折叠）▸ 工具 / 技能 / MCP；**模型与 Agent**（可折叠）▸ LLM 配置 / Agent 管理
    ——两两归到一个父项下（侧栏早就支持子菜单、收起态弹出菜单与 ⌘J 搜索，不需要新机制）。
  · **拦截规则 + 资产拦截 + 审批记录 → 一页「拦截与审批」**：页内用与系统设置同款的分区导航
    （命令拦截 / 模型兜底审批 / 资产黑名单 / 审批记录），待审批条数直接显示在分区导航上。
    旧地址 `/system/intercept/assets` 与 `/system/intercept/approvals` 保留为兼容壳页，
    书签与仪表盘的待审批直达链接都不会断。
  · 通知推送 / 日志 / 系统配置 保持平级（一个是渠道 CRUD、一个是 SSE 控制台，形态差异大）。
  · 侧栏高亮顺带改成"精确 + 前缀"匹配：详情页与别名页也会点亮所属入口（此前在任务详情页
    侧栏是不亮的）。
  · 待审批红点从"硬编码挂在 approvals 这一项"改为声明式 `liveBadge`，条目改名/合并都不会丢。
- **顺带修一个静默数据丢失**：agent 编辑器的「常驻技能」会被清空——它读的 `GET /api/agents/{key}`
  不返回 `skill_always`（唯一返回它的路由前端从未调用），于是勾任何一个 MCP/技能复选框时
  都会带着空集合走全量替换，把该 Agent 已标记的常驻技能全部清掉。后端补上该字段即修复，
  并加了契约测试（详情载荷与 /visibility 路由必须一致）。

#### 变更

- **系统设置页改成「分区导航 + 无卡片表单」**：此前是一个长页面上十几张卡片的多列瀑布流
  （视觉顺序与阅读顺序不一致、也没有分区），现在参考 CyberStrikeAI 的设置界面重排为
  **左侧分区导航（基本设置 / 网络与代理 / 联网搜索 / 情报来源 / 安全与策略 / 执行与并发 /
  高级与界面）+ 右侧单分区内容**，一次只看一个分区；内容面板去掉卡片边框，改用
  「分区标题 → 子块标题（下方细线）→ 标签在上、说明小字在下」的排版分层，
  层次更清楚、密度更高。窄屏下左侧导航塌成顶部粘性 chips 条。
  - 保持不变的红线：**所有设置项、API、生效时机与保存方式一律未动**（开关即时保存、
    Key 各自保存、探索策略走独立端点、发送键位存本浏览器）——本次只重排布局。
  - 顺手修三处：①「清除 Key」加二次确认（此前点了就清）；② 流量捕获 / 网络搜索 / Python
    三处曾共享同一个 `saving` 状态、会互相禁用对方的控件，已按用途拆开；
    ③ 更新卡里「可在上方配置全局代理」的指引在分区后失效，改为指名分区。
  - 高级项（网络搜索出口代理、情报源端点与配额、探索策略自定义条目）收进「高级设置」折叠，
    与任务页同款交互；情报源最近查询台账同样改为默认折叠。

### 执行限额与熔断

#### 新增的功能

- **长任务执行有了资源上限（P24）**：`run_execution` 此前只有硬超时，没有 CPU/内存/进程数上限——
  一条跑飞的扫描（`nmap -T5`、`ffuf -w big.txt`）就能把平台自己这台机器打满。现在每次执行按设置
  加 `ulimit` 前导（**0 = 该轴不限**；默认只开 CPU 30 分钟这一个上限，内存/进程数默认不限，
  免得误伤正常工具）：CPU 秒 / 内存 MB / 进程数，改设置对之后提交的执行生效。
  - **如实记账，不假装限住**：`ulimit` 前导前先探测本机 `/bin/sh` 支持哪些轴，不支持就在台账的
    `limits` 字段记 `applied_*=false` + 一句人话说明；执行回执（`get_execution`）也带上这份快照，
    模型与人都能判断"这条命令失败是不是撞了限额"。
  - **撞限额被杀要说清楚**：进程被信号终止（SIGXCPU 24 / SIGKILL 9）时，台账理由写明
    "信号 24=CPU 限额 SIGXCPU，9=硬杀……若本次设了 CPU 限额就是撞限的表现"，而不是含糊的
    `signal: killed`。
- **外部 MCP 的并发上限与熔断（P24）**：MCP server 挂掉或变慢时，Agent 会一轮轮重试、把 run 的
  时间全烧在超时等待上；并发也不受控（N 个 worker 同时打同一个 server）。现在每个 server 一份
  守卫：**并发上限**（默认 2，排到槽位再发，`ctx` 取消能及时退出）+ **连续失败熔断**（默认 5 次，
  冷却 60s）。开闸期间直接**快速失败并说明剩余秒数**（不发网络请求、不空等超时），冷却后放行一次
  真实调用，成功即恢复。
  - **熔断只由传输层失败计数**：server 明确答复的 RPC 错误（比如工具名写错）不算"不健康"，
    不会把使用错误记成服务故障。
  - **状态可见、可手动重置**：MCP 页每个 server 显示"熔断中 Ns / 连续失败 N / 并发占用"，
    一键「重置熔断」（修好配置或服务恢复后用）；设置页可调并发上限、阈值、冷却。
  - 状态在内存、按 server 名共享（跨重连保留"刚才连续失败"的判断），重启归零——熔断是"此刻"的
    判断，不该跨重启持久化。

### 公司知识

#### 新增的功能

- **「这家公司已知什么」跨任务可用（P23）**：此前每个任务的知识都是孤岛——同公司、互不关联的
  两个任务互相看不到对方测出过什么（跨任务血缘要人工指定，且只直接、不递归）。现在可以把
  一条**已确认**的结论沉淀为**公司级知识**，同公司的其它任务会把它当**只读先验**读到：
  态势（graph_overview）里有独立一段 + 来源任务，常驻索引里也带一份（压缩吃不掉）。
  - **显式沉淀，不自动灌**：Agent 用 `promote_knowledge` 工具（planner/主 Agent 可用，
    worker 不绑——避免边跑边灌噪音），人可以在发现详情页点「沉淀到公司知识」直接做。
    跨任务结论质量参差，自动沉淀会把"已知"变成噪音。
  - **只沉淀立得住的**：来源必须是图里 **confirmed** 的 fact/finding；且发现的 **triage 状态**
    单独判一次（误报/已撤回/已排除/重复一律拒）——图节点状态不反映 triage 状态，撤回只翻
    findings 行（这个坑是验收抓出来的：不判就会把"被复测推翻的结论"放出去）。
  - **带来源、可回溯**：每条都记来源任务与来源节点，点得进去；沉淀到"不是本任务关联的企业"
    会被拒（知识写错公司比不写更糟）。
  - **只读**：Agent 侧只有"沉淀"这一个写口，没有任何改/废工具；**废弃与恢复是人的动作**
    （资产页 → 企业 → 知识），废弃**必须写理由**（与发现撤回同款纪律：留下"为什么不算数了"），
    废弃后不再注入但保留痕迹，可一键恢复。
  - **不等同于本任务已测**：注入时明确写"来自同公司【其它任务】的沉淀（只读先验），不代表本任务
    已测过"——不参与本任务的"已做过"去重，避免把别的任务的进度当自己的。

### 拦截

#### 变更

- **RoE 授权范围门的默认模式从 `off` 改成 `ask`**：此前默认是「不启用」——agent 的工具调用若携带
  任务授权范围（task_scope）之外的目标，**没有任何人被告知**就放行了；这与本项目自己的原则相反
  （P12 的失效安全在范围读不出来时取的就是「宁停勿越」）。现在越界先落到人手里：弹出审批，
  由你决定放行还是拦下。
  - **只影响「从未保存过 `intercept_scope_mode`」的实例**；显式保存过的值仍然优先。想让越界直接
    被拦、不走人工，把该设置写成 `deny`，或用环境变量 `BLADEPRO_SCOPE_ENFORCEMENT=deny` 强制。
  - **越界审批不设超时**：它会一直等到你裁决、或该工作被取消。这是刻意的——授权边界上「等」比
    「替你决定」更安全。等待期间意图租约会持续续住，不会被看门狗判成僵尸回收。
  - 未声明可用范围行的任务、以及没有任务的上下文（对话页 / Auto agent）不受影响。

#### 修复的问题

- **修复：无超时的审批，人的决定会被静默丢掉**。意图租约的心跳由「活动」驱动，而无超时的审批在
  等待期间不产生任何活动——15 分钟后租约到期、看门狗把意图判成僵尸回收，`HandleAsk` 随即走
  「工作已取消」分支把这次审批**判成 deny**。也就是说：**你只要回得慢于 15 分钟，你的批准就永远
  落不了地**，而 agent 会把这次工具调用当成「平台拒绝了」继续往下走。现在等待期间会按节拍投一条
  「仍在等待人工审批」的活动（既是租约心跳，也让时间线上看得见它在等你）。
- **修复：任务内的人在环路此前**三样门全无**。对话页的 agent 挂了拦截规则与模型兜底裁判，而
  **任务内**的人在环路（mainagent）此前 `guard` 根本没接上——拦截规则、模型裁判、RoE 范围门
  **一样都不生效**，而它同样能执行命令、且调用点拿得到任务的真实 id。现已补上（与对话页同款
  接线，用该任务的真实 id，所以范围门对它也生效）。
- **修复：`run_execution` 曾是唯一没有门的执行路径**。它不在默认拦截启用集里，于是拦截规则、
  模型兜底裁判、RoE 范围门一起被跳过；即便把它加进启用集，目标抽取器也不认识它的 `command`
  参数，范围门仍然看不到它携带的目标（两层独立的漏，只补一层不成立）。而 worker 提示词恰好要求
  把 nmap/nuclei 这类长扫描导流到它——最可能触及范围外主机的操作，走的正是那条无门路径。现在
  抽取器覆盖它（以及 `WebFetch` 的 URL），启用集也纳入它。

### 认证与凭据

#### 修复的问题

- **改密码现在会立即吊销此前签发的所有 token**：此前只做「验证旧密码 → 写入新哈希」，不轮换签名
  密钥也不带 jti，于是被偷走的那个 7 天 token 会一直有效到自然过期——**改密码失去了「止损」的
  意义**。现在改密码即轮换签名密钥，等价于吊销全部 token；前端随之退回登录页（需要重新登录）。
  轮换失败时如实回报「token 未失效」，不假装成功。
- **登录加了失败节流**：bcrypt 只让每次尝试变慢、不限制次数，没有节流等于把门敞着让在线爆破随便
  试。现在连续失败 5 次锁定 5 分钟，且**节流先于校验**——锁定期内即使密码正确也拒绝（否则猜对的
  那一次会直接放行）。成功登录即清零。状态在内存、重启归零。
- **同源 SSE 的凭据不再出现在 URL 里**：此前 `?token=` 是无条件附加的，而生产默认是同源——浏览器
  会自动带上 cookie，URL 里根本不必出现凭据。它出现一次的代价是实的：进浏览器历史，以及**反向
  代理的 access log**（README 的 nginx 示例默认记录 `$request`，其中含查询串）。现在只在**跨源**
  时才附加（开发态前端 :5173 → 后端 :8787 属此列，行为不变）。
- **cookie 在 HTTPS 下带 `Secure`**。注意这里做不到 HttpOnly——cookie 由 JS 写入，且 token 本来
  就存在 localStorage 里；要真正挡住 XSS 读凭据得整体改成服务端 `Set-Cookie` 的 HttpOnly 方案。

### 服务端

#### 新增的功能

- **同时执行数上限（`exec_max_active`）**：`run_execution` 的长任务此前只有**每一条**的资源限额
  （P24 的 ulimit 前导：CPU/内存/进程数），没有**同时几条**的上限——单条被 CPU 限额兜住，但 agent
  若起了一百条，机器照样被打满（而执行是跨意图累积的，进程活过本次 agent run）。现在每个任务默认
  最多 8 条同时在跑（`0 = 不限`，可在「系统配置 → 执行与并发」改）；达上限时新提交被拒，并说明
  怎么腾名额（`wait_execution` 等收尾 / `cancel_execution` 取消一条）。
- **记录了 schema 指纹**：启动完成后会把当前二进制**嵌入**的 `schema.sql` 的 sha256 写进设置
  （`schema_fingerprint`），并在结构变化时打一行「schema 已变更: abc123 → def456」。这是为了回答
  一个此前无从回答的问题——「**这个库是哪一版结构**」：在「重启即迁移」的设计下，库的结构由最近
  一次启动的二进制决定，而 schema 里只有并发迁移用的锁、没有版本号。指纹只在变化时才写。

#### 修复的问题

- **HTTP 服务补上 `ReadTimeout` 与 `IdleTimeout`**（30s / 2min）。**`WriteTimeout` 有意不设**：
  活动流、日志流等是 SSE 长连接，而 `WriteTimeout` 按整段响应计时，设了会把它们掐断（表现为
  「活动流跑一会儿就断」）。要限制单次响应的写入时长应在具体 handler 里用
  `http.ResponseController` 按需设 deadline。

### 情报与测绘

#### 修复的问题

- **配额台账写失败不再静默**：`intel_queries` 台账同时是**配额计数器**，而写入失败此前被忽略。
  于是这次调用没被计数 → 下一次读到的用量偏低 → **平台侧每日上限可以被悄悄超出**，而模型与人都
  看不到。现在失败会记日志，并在工具回执里附一句「本次未能记入台账，配额统计会偏低」。

### 资产

#### 修复的问题

- **按任务范围取资产不再退化成逐条 scope 行全表扫描**：公司/根域/子域/网段/备案五种范围此前是一个
  大 OR 连接，规划器据此选了「嵌套循环 + 对 assets 逐条 scope 行扫描」——实测 20 条范围 × 5 万
  资产 = **100 万行逐对求值**、单次 296ms，而这个查询在**每次态势快照**（规划器每轮 + 每个 worker
  run）都会跑。改成按范围类型拆开后各走各的索引，实测 5 万资产 265–290ms → **101ms（2.6–2.9×）**。
  两种写法的结果集完全一致（有等价性测试钉住）。


## [0.4.0] - 2026-10-14

### 计划任务

#### 新增的功能

- **按固定节奏自动建任务（P22）**：任务列表右上角新增「计划任务」：填一份**任务规格**
  （名称/描述/目标/分类，可从任务模板预填）+ 一个**结构化频率**（每 N 分钟、每 N 小时、
  每天 HH:MM、每周某天 HH:MM），到点自动按规格建一个普通任务——之后的派活、拦截、推送、
  交付全走既有链路。适合"每周复测一遍这批资产""每天看一眼有没有新上线资产"这类固定节奏的活。
  - **不引 cron 依赖**：结构化表单覆盖了巡检的全部实际需要，而 cron 表达式的边界语义
    （夏令时/月末/方言）只会带来歧义；填 cron 字符串会被明确拒绝。
  - **不会重复触发**：到点先把排期推到下一次（原子 CAS），推成功的那一次才去建任务——
    多个 tick、重启、同实例并发都只建一个。
  - **不追补**：进程停机期间错过的次数只跑一次（开机那一次），不会连建三个任务；
    要补就跑「立即运行」（**额外**一次，不改排期）。
  - **失败如实留痕**：触发时规格变坏（分类被删等）会落"上次失败：原因"且不建空任务，
    排期照常推进（不会每 5 秒热循环重试）；停用即清空排期。
- **任务规格是快照**：计划任务存的是**整份规格**而不是引用模板——模板是给人预填表单用的，
  计划任务要的是可重放；模板后来被改了不该悄悄改变已经在跑的计划。

### 情报与测绘

#### 新增的功能

- **让 Agent 自己去查资产（P21，先接 FOFA）**：此前目标面只能靠人在外部测绘引擎搜好、再把资产
  手工喂进平台。现在 Agent 多了一个 `intel_search` 工具：用**源的原生语法**（FOFA 语法）查询，
  回执给"命中总数 + 紧凑清单 + 完整结果的绝对路径"（大结果落盘，需要就 Read，不灌上下文）。
  - **只查不扩**：工具只返回候选，**不入资产库、不动任务范围**——要把结果变成平台资产得显式调
    `insert_assets`，要纳入本任务范围得用 `add_task_scope`；资产拦截规则在这条路上照常生效
    （验收里钉住：情报查到的 host 一旦命中拦截规则，拿它当意图目标会被拒）。边界也没松：
    查 FOFA 是访问第三方 API，因此不过 RoE 门；但拿结果去打真目标时照样被 RoE 拦。
  - **配额与审计**：每次真实查询都落 `intel_queries` 台账（表达式/命中数/任务/错误）并占用
    **平台侧每日上限**（默认 200，可在设置页改，0=不限）——FOFA 自己的额度之外再加一道闸，
    防模型一天把额度刷光；超限时拒绝理由给出用量与出口。任务时间线留 `intel_query` 痕迹。
  - **配置与密钥**：系统设置新增「情报源（测绘引擎）」卡：API Key（**只存不回显**，页面只显示
    是否已配置，可一键清除）、老账号邮箱、自定义端点（企业版/自建，也是验收把请求指向假服务的
    开关）、独立出口代理（留空跟随全局代理）、每日上限；「测试连接」打一次账号接口回显剩余额度
    与平台侧用量，并列出最近查询台账。
  - 框架留了加源的口子：`intel.Provider` 注册表，接第二家（Quake/ZoomEye/Shodan）只需写一个
    实现 + 一行注册；未注册的源给可读错误，不静默串源。

### 探索策略

#### 新增的功能

- **给「探索链路」加上可配置的边界（P20）**：此前新建任务后，提哪些意图、探测什么，完全由模型
  自行决定——平台只在工具调用层（拦截规则/授权范围）与提示词层设界。现在任务详情总览有「探索策略」
  卡片，三个面可配：**手段面**（口令爆破、DoS/压测、社工钓鱼、WebShell、反弹 Shell、持久化驻留）、
  **敏感写**（HTTP 删除、PUT/PATCH、变更类接口路径、数据库写、脱库导出）、**节奏面**（每轮/在途/
  累计意图上限）。默认值在 系统设置 →「探索策略（全局默认）」，任务创建时可继承、可覆盖（高级设置里
  勾「自定义」），任务页可随时改。
  - **意图层硬拒 + 理由可操作**：不符策略的方向**不会进探索图**，拒绝理由写明"命中哪条策略、命中
    词是什么、往哪改"（如被禁爆破时指向"看失败锁定/验证码/速率限制/错误回显差异"）。被拒意图不在
    图上留节点（不污染探索与去重），但会在时间线上留痕（`policy_reject` 活动 + 策略卡的"近期被拒"）。
    拒绝话术里明确"这是平台策略、不是目标侧的防御"，避免模型换编码/换措辞重试。
  - **命令层同源兜底**：同一份策略编译成**任务级拦截规则**（只对本任务生效），所以在工具调用层
    与措辞无关——换个说法点名同一手段照样拦。规则与策略同源重建（保存/清空/启动自愈），
    事务内删旧插新、失败则旧规则原样保留（宁可继续拦，不静默放开）。
  - **词表之外可手写条目**：词表是封闭的（确定性判定的前提），覆盖不到时在策略卡/设置页手写
    「自定义禁止条目」——**关键词**（ASCII 词边界 / 中文子串，与词表同款否定语境豁免）或
    **正则**（按原文匹配，不套豁免），可选 **「仅命令」层**（只拦工具调用、不判意图措辞，
    适合"说说没关系、做出来才有事"）。非法正则/超长/超量/命令门规则总数超限都会**写入即 400
    并说明原因**（不静默丢——静默丢会让人以为边界生效了）。全局默认里的自定义条目会被新建任务
    继承，任务页可单独增删。
  - **只做加法，且只做确定性判定**：内置破坏性拦截（删除类请求等）始终生效，策略放开某类操作
    不会解除它；判定只认封闭词表与形状化正则（`DELETE FROM users` 拦、`grep "DELETE FROM" ./src/`
    不拦；`hydra.example.com` 不命中 `hydra`），否定语境（"检查是否有爆破防护"）放行但留痕。
  - **不被策略憋死**：策略内确无可行方向时（窗口内连续被拒且没有任何新方向进图、也没有在跑的活），
    任务以 `policy_blocked` 终态体面收尾（不是"超时"——改策略/加目标即可复活），并在时间线说明原因；
    全局默认只在**创建时**解析成任务快照，改全局默认不会改变已建任务的边界，也不会出现"运行中被
    另一处改设置"的竞态。

### 漏洞交付

#### 新增的功能

- **批量交付（P19）**：任务的「漏洞」页新增「批量交付」卡片——把本任务的发现打成一个 zip：
  **提交说明**（发现清单 + 逐条证据状况 + 未进包说明）+ 每条发现的**规范简报 md 与可提交件 docx**，
  按 `findings/<id>-<标题>.md|.docx` 归档。先「检查交付包」看计划再下载；已撤回的发现不进包
  （在提交说明里交代清楚）。
- **疑似重复会先告诉你（P19）**：同一漏洞常被两次登记（换个 intent、换个 payload 又发现一次），
  提交重复件会被驳回或降级。现在按**稳定指纹**（漏洞类型 + 归一化端点集合：方法/路径/参数名，
  与 payload、措辞无关）自动归组，在交付卡片与提交说明里提示"这一组建议只交一条"。
  没有绑定流量的发现**不给指纹**（那种"指纹"只能靠资产+类型硬凑，会把同一资产上两个不同的洞
  认成一个）——宁可少报疑似重复，不可误导人合并。
- **证据门口径统一**：单条导出与批量交付共用同一份警告清单（缺流量、缺 proof/verification 整包、
  已撤回、长任务仍在跑），所以"预览里说缺什么"与"包里写的"永远一致；批量包只对**进包**的
  发现报证据门（撤回的单独在"未进包的发现"一节交代）。

### 操作约束

#### 新增的功能

- **操作约束可以编译成真正的拦截规则（P18）**：此前「任务操作约束」（允许/禁止）只是注入
  planner/worker 系统提示词的建议，Agent 可以不听。现在任务页每条约束旁边有一个盾牌按钮：
  **先编译预览、再应用**。编译是**确定性**的——只从约束原文里抽取可核实的目标（域名/IP/URL）
  与已知命令行工具名，不做"猜测意图"的推断；抽不出东西的约束会如实说明，绝不硬造规则。
  · **禁止类**约束 → 任务级 `deny` 拦截规则：命中即拦，且**只对该任务生效**（别的任务不受影响）。
  · **允许类**约束 → 加入本任务的授权范围（RoE 允许面），与范围面板同一口径（子域归一化到根域）。
  · **预览拿本任务真实发生过的工具调用当样本**（活动日志里每一次调用都有），直接告诉你
    "这条规则会命中最近 N 次调用中的几次、命中的是哪一条"，误伤和拦不住都能在落库前看见。
- **约束的生效状态可见、语义不会静默漂移**：约束列表标注「已生效 N 条 / 仅提示词」；
  修改约束会**撤掉它此前编译的规则**（并提示需要重新预览确认），删除约束会连同规则一起删——
  避免"规则还在拦、但人不知道它从哪来"或"约束改了、拦的还是旧语义"。
- **拦截页只显示全局规则**，任务级规则随任务走（在任务页管理），两边的条数上限分别计算。

### SDK（norma）

#### 变更

- **norma 转为个人维护线**：上游 `Autumn-27/norma` 不再发版，SDK 侧修复改由 fork
  [`lin9527ya/Norma`](https://github.com/lin9527ya/Norma) 维护并打 tag，`go.mod` 用
  `replace` 指向它（fork 保留原 module path，import 路径不变）。维护线自带 CI，
  **每个 tag 都自带一次全绿测试**；差异台账在该仓库的 `FORK.md`，操作流程见
  `docs/SDK维护线.md`。
- **当前接线 `v0.4.6`**，累计包含：溢出输出指针恒为绝对路径；截断按 UTF-8 rune 边界
  对齐（不再切出半个汉字）；会话关闭不再删除后台任务输出目录（后台输出与"完整输出
  已存到 <路径>"的指针不再变死链）；子进程注入非交互默认环境（`PAGER`/`GIT_PAGER`/
  `SYSTEMD_PAGER=cat`、`DEBIAN_FRONTEND=noninteractive`，避免守着一个没人看的终端）；
  模型调用在手工组装的配置下不再因缺 HTTP client 而 panic；noa 溢出时学习 provider
  报出的真实窗口（此前该学习路径无调用者）；**后台任务输出改由宿主指定根目录**。
- **一次运行的所有产物同根**：后台任务输出（Bash 超时自动转后台、`TaskOutput`/`TaskMonitor`
  的文件）从 `$TMPDIR/norma` 移到本次运行目录下的 `task-output/`，与 `cmd-output/`、
  `executions/`（执行台账日志）、`compaction/`（压缩原文）同处 `<数据目录>/tasks/<任务>/...`。
  于是任务删除时已有的文件清理、备份、人工排查都只需要面对一个根；`$TMPDIR` 既不随宿主
  生命周期、也可能挂在 tmpfs 上（重启即失）。

### 拦截

#### 修复的问题

- **堵住授权范围门的 `run_execution` 逃逸**：worker 提示词要求「预计超过 2 分钟的任务
  （nuclei/ffuf/nmap 等扫描器）一律用 `run_execution` 起」，而它恰好是整个拦截面上唯一没门的
  执行路径——**不在默认启用集里**，于是拦截规则、LLM 兜底裁判、RoE 范围门被一起跳过；即便把它
  加进启用集，**目标抽取器也不认识它的 `command` 参数**，范围门仍然看不到它携带的目标。两层
  独立的漏、只补一层不成立，越界扫描因此可以畅通无阻且全程静默。现在：
  - 目标抽取覆盖 `run_execution`（`command`）与 `WebFetch`（`url`）；
  - 默认启用集纳入 `run_execution`，恢复破坏性/外泄规则与兜底裁判的管辖；
  - **范围门提到工具启用集之前**——`intercept` 的包注释一直写着「授权边界高于一切规则配置」，
    而实现把 `IsToolEnabled` 排在 `CheckScope` 之前，两者相反。改后授权边界不再取决于某个工具
    有没有被登记，顺带也解掉了「已保存过 `intercept_enabled_tools` 的用户拿不到新默认项」的
    迁移问题。
  - 回归用例补在 `intercept/scope_test.go`。那里此前只测两个纯函数、**从未经过工具名这一层**，
    这正是它长期没被发现的原因：测的是「门在」，不是「门覆盖了所有出口」。

### Agent

#### 修复的问题

- **`graph_overview` 的 `findings_total` / `facts` 改为真计数**：原实现取
  `len(ListByKind(kind, 1000))`，任务超过 1000 个漏洞/事实后报出去的是「截断窗口的大小」而不是
  总数——而 `findings_total` 是 planner 判定目标是否达成的依据，一个被封顶的数字会静默低估已完成
  的产出。改为 `COUNT` 真计数；findings 列表顺势只取要展示的那一窗（原本拉 1000 行只为显示 10 行）。

## [0.3.15] - 2026-10-07

### 拦截

#### 新增的功能

- **新增内置拦截规则「删除类接口路径」**：此前内置的 HTTP 破坏性规则只认 DELETE **方法**，而多数应用的删除接口用 GET/POST 就能触发，`curl 'http://t/api/user/delete?id=1'` 这类调用会真实删掉目标数据。现补一条 `deny` 规则覆盖 `/delete /del /remove /unlink /erase /destroy`（动词后必须跟分隔符，`/delivery`、`/details`、`/delta` 不会误拦）。已有实例升级后也会拿到，可在「系统 → 命令拦截」里停用或删除。
- **模型兜底审批的 token 消耗可单独查看**：审批调用此前没有独立的计量归属，花了多少只能靠猜。现在它单独计量，「系统 → 命令拦截」的「模型兜底审批」开关下方新增用量卡片——调用次数、输入、输出、缓存读写五项累计统计，加一张近 30 天每日消耗的迷你柱图。

### 漏洞推送

#### 新增的功能

- **漏洞发现支持推送到 IM**：新增「系统 → 通知推送」页，可把扫描发现推送到**钉钉、飞书、企业微信、通用 Webhook、Telegram、邮件**六种渠道。同一类型可配任意多个实例，每个实例独立设启停、限流与过滤规则。
- **推送时机分实时与汇总两种模式**：实时模式命中即逐条发送；汇总模式按全局周期（默认 30 分钟）合并成一条消息，开头给出新增数量与级别分布。想做「高危实时、其余汇总」就建两个渠道分别配置。
- **过滤规则支持四个维度**：最低严重级别、限定任务 / 资产范围、漏洞类型关键词包含与排除（排除优先）、是否接收处置状态变更（默认关）。消息带「查看详情」按钮，目标地址由全局「回链地址」配置，留空则不带按钮。
- **投递历史与手动重发**：列出每条投递的状态、尝试次数、失败原因与所属渠道，可按渠道与状态筛选；失败项可一键重发（重发会清零重试计数）。
- **渠道凭据掩码回显**：Webhook 地址、加签密钥、Bot Token、SMTP 密码等只回显带尾号提示的掩码值；提交时原样回传表示「不修改」，清空输入框则删除该字段。

#### 修复的问题

> 本节是功能初版完成后一轮安全审计的结论，每条都先复现、再修、再补回归测试。

- **修复掩码可被「改目标地址、保留凭据」绕过（严重）**：配置合并对「未提及的键」一律保留库中原值，于是只改地址、对凭据避而不谈，就能让服务端把库里的真凭据发到任意地址，且完全静默。现规定目标地址一旦变化，每个凭据字段都必须显式表态——给新值，或显式留空表示不再需要。
- **修复 markdown 系渠道对不可信内容零转义**：漏洞标题与摘要来自模型输出、资产 URL 来自扫描结果，构造的标题会在钉钉 / 企业微信 / 飞书里渲染成可点击外链，图片语法则会在渲染时被客户端拉取并泄露阅读者 IP。现统一做单行化 + markdown 元字符转义，且转义发生在各渠道的渲染出口而非共用的标题函数。
- **修复投递地址的 SSRF 面**：此前环回、内网与云元数据地址一律可投递，而失败响应体前 200 字节会进 `last_error` 并被投递历史回显，构成一条半盲读原语。现改在**拨号阶段**设防，覆盖 DNS 重绑定，并拒绝跨主机重定向；环回与链路本地地址需显式设置 `BLADEPRO_NOTIFY_ALLOW_LOCAL=1`，RFC1918 私网仍放行（内网自建 SMTP 中继很常见）。
- **修复推送凭据经错误信息外泄**：钉钉的 `access_token`、企业微信的 `key`、Telegram 的 bot token 都在 URL 里，而投递失败时完整 URL 会流入 `last_error`、投递历史、服务端日志与前端提示四处。现统一脱敏，只保留 `scheme://host` 与底层原因。
- **修复汇总消息被截断后整批标记已送达导致的静默丢失**：被截掉的漏洞既不在消息里、也不在失败列表里，投递历史却显示成功。现改为按**整条**打包，只标记装进本条的那些，其余回队列等下一条续发且不消耗重试次数，消息头部也写明还有多少条将在下一条继续。
- **修复最低级别门槛打错字会让过滤器静默失效**：`min_severity` 写成 `hgih` 这类笔误时未知级别序数为 0，判定退化成恒真，用户以为只收高危、实际全部漏洞都被灌进群里。现于写入路径校验取值并列出可选值。
- **修复 `rate_per_min = 0`（不限流）不可达**：写库这一层把显式 0 悄悄改成了默认值，操作者以为放开了限流、实际仍被卡着。默认值改到接口层在字段缺省时填。
- **修复汇总渠道完全绕过令牌桶**：`rate_per_min` 对 digest 模式此前没有任何作用。现在领取条数同时受本轮额度与内存上界两个约束。
- **修复失败处置按整批最大尝试次数判断，让老投递连坐新投递**：一个已重试两次的老投递会把同批里全新的投递一起拖进 failed，新漏洞一次重试都没用上就永久丢失。现改为逐条决定。
- **修复汇总批次中快照无法解析的投递被静默标记成功**：这类条目会被渲染阶段跳过，却随整批一起算作成功。现在显式判失败并给出原因。
- **修复单渠道每轮投递条数可能超出租约时长**：多实例部署下，租约过期的行会被重新领走、重复发送并双份递增尝试次数。现按「租约 / 单次超时」倒推每轮上限，并有断言把这几个常量的关系钉死。
- **修复 Telegram 截断可能切断 HTML 实体**：截断只避开了半截标签，没避开 `&amp` 这类实体残片，而解析器可能因此拒收**整条**消息。现在两者都回避。
- **修复邮件渠道把临时性 SMTP 失败判成永久失败**：灰名单 `450` 这类 4xx 是临时拒绝、本该稍后重试，此前一律判死，启用灰名单的服务器会让每条推送都在首次尝试后失败。现按应答码首位区分，4xx 可重试、5xx 永久失败。
- **修复提交嵌套结构时会真的把掩码字面量写进库**：像 `webhook.headers` 这种对象字段只能整体掩码或整体提交，把掩码哨兵塞进对象内部会被当真实值存下来、导致鉴权静默失效。现在这种提交被显式拒绝。

#### 设计说明

- **写漏洞的事务只做一次盲 INSERT**：`notification_events` 与漏洞在同一事务内写入，提交即保证两者原子一致。这条 INSERT 刻意不读渠道表、不跑用户的过滤规则，并由 `SAVEPOINT` 包住——否则一条配错的过滤条件就能中止事务，让高危漏洞存不进库。
- **投递用租约领取而非长事务**：`FOR UPDATE SKIP LOCKED` 领取后把行置为 `sending` 并把 `next_attempt_at` 推到未来作为租约，投递期间不持有数据库锁；进程崩溃留下的行会在租约到期后被重新领取，自愈且不会无限重试。
- **限流不消耗重试预算**：先按令牌桶算出本轮额度，再按这个数量去领取。顺序反过来会让被限流挡下的投递白计一次尝试次数，三次预算被纯等待耗光后落入失败。

### 测试基础设施

#### 修复的问题

- **修复公司 ICP 归属用例的清理顺序导致的资产永久残留**：`defer d.Close()` 在函数返回时先执行、`t.Cleanup` 在其后，于是清理语句全部落在已关闭的连接上，错误又被丢弃，测试资产与公司永久残留在库里，还会让其他按资产计数断言的用例莫名失败。现改为关闭连接也走 `t.Cleanup` 并注册在前，同时让清理失败显形。

### 流量

#### 新增的功能

- **流量列表支持内容检索、路径 / 状态码 / 长度筛选与列排序**：筛选行支持按**响应内容**（走全文索引）、**路径**、**状态码**（精确值或 `2xx` 这类分桶）、**响应长度范围**过滤，表头可按时间、状态码、响应长度排序，排序偏好记在本地。新增两个索引，已有实例升级后自动生效；Agent 工具的 query 契约未改动。
- **流量列表新增「清空全部」**：一次删除全部流量记录（忽略当前筛选），并清理索引已不再记录的历史 host 目录，清空后顺带做一次全量压实并提示实际释放了多少空间。已绑定到漏洞的流量证据存在独立的证据库中，不受影响。

#### 修复的问题

- **修复删除流量后磁盘空间不被释放**：索引库建库时没有启用 `auto_vacuum`，文件永不收缩；全文索引又是 `contentless_delete`，`DELETE` 只写 tombstone 而不回收原 postings——删流量反而让索引变大（实测抓 6MB 正文 → 索引 16MB，删光后仍是 16MB）。现在新建索引库启用 `auto_vacuum=incremental`，每次删除后在后台分块执行全文索引合并与增量回收，逐步把空间还给系统（同一场景回落到 104KB）；回收在块间释放写锁，不阻塞流量录制。

> 升级说明：`auto_vacuum` 只能在建库时设定，因此**已有实例的索引库仍是旧模式**，增量回收在其上是空操作（启动时会打印一行提示）。这类库升级后 tombstone 的增长已经止住，而已占用的体积用「清空全部」回收一次即可——那一步会把库转成增量回收模式，此后日常删除自行生效。

### LLM

#### 修复的问题

- **修复自定义会话头在「一次性 LLM 调用」路径上不生效**：目标拆解（第 0 轮）与冷节点压缩都是不挂 transcript store 的一次性调用，context 上没有 session id，网关侧因此读不到该头——对 opencode zen 这类缺头直接 400 的端点，表现为「第 0 轮失败、后续 planner 轮次却完全正常」。现为这两条路径显式挂上按探索稳定的 session id，顺带让 token 用量能正确归因到对应探索（此前完全记不到）。

### 工具

#### 修复的问题

- **修复 MCP 与自定义工具的输出截断不生效，大结果整段灌爆上下文**：MCP 工具的返回此前完全不经截断，HTTP 类自定义工具则因传入空的工具上下文，一直用写死的 6000 字符而非会话配置的上限。现两条路径统一走 `actool.Capture`：按会话 `MaxOutputChars`（默认 30000）截断，配了 `ToolOutputDir` 时把全量输出溢写到磁盘、消息里只留开头片段与文件指针。
- **升级 norma 到 v0.4.3**：harness 层统一执行 `CaptureOnce`，任何工具（含今后新增的）都不会再因为漏接截断而溢爆上下文。

### 部署

#### 修复的问题

- **修复反向代理部署下活动流连不上**：SSE 地址此前无条件拼成 `${hostname}:8787`，反代到 443 的部署里页面从 `https://域名/` 加载、SSE 却被指向未对公网开放的 8787 端口，表现为活动流反复重连。现按 `NODE_ENV` 区分：生产默认同源，仅 `next dev` 保留 `:8787` 以绕过 Next.js 对 SSE 的缓冲；`NEXT_PUBLIC_SSE_BASE` 覆盖口保留。README 补充了反向代理部署说明。

### 发现

#### 修复的问题

- **修复「按资产」视图资产列表溢出后没有滚动条**：外层卡片只给了 `max-height` 而没有确定高度，滚动视口的百分比高度解析不出来，于是资产多时列表要么撑破卡片、要么被截断且无法滚动。现把高度上限直接落到资产树的原生滚动容器上，随窗口高度自适应。

### 数据库

#### 修复的问题

- **为连接池设置上限**：`database/sql` 默认不限制应用自身可打开的连接数，池里没有空闲连接时会无条件新建，一路顶到 PostgreSQL 的 `max_connections`（默认 100）才被拒。现封顶 32 条，超额查询改为等待空闲连接，同样的负载下表现为变慢而不是报错；若 `max_connections` 调低过需同步下调。
- **提升连接复用率**：`MaxIdleConns` 的默认值是 2，并发超过 2 的连接用完即关、下次请求要重做 TCP 与 PostgreSQL 认证握手。现将空闲上限提到与总上限一致，并补上 30 分钟连接寿命与 5 分钟空闲淘汰，让池能自然换掉长期存活的坏连接。

### 贡献者

- [@Autumn-27](https://github.com/Autumn-27)

## [0.3.14] - 2026-09-24

### 任务列表

#### 新增的功能

- **任务列表新增「漏洞」列**：按严重度分档显示 严 / 高 / 中 / 低 的数量，非零档位按严重度着色，一眼看清每个任务的漏洞规模与分布。

#### 修改的功能

- **「描述 / 目标」两列宽度收窄**：超长内容省略显示，鼠标悬浮可查看全文，减少长文本挤占列表横向空间。

### 探索图与规划态势概览

#### 修改的功能

- **精简规划态势概览（graph_overview）并为各列表设定数量上限**：最近事实、已结束意图、待办意图、冷区摘要与确认漏洞明细均改为「最新一窗 + 计数兜底」，未展示的可按需查询；显著降低每轮 LLM 上下文体积、避免长任务上下文膨胀（关联任务概览的冷区一并限流）。

#### 修复的问题

- **折叠冷节点后消除探索图中 digest 与 finding 之间的反向重复边**。

### 贡献者

- [@Autumn-27](https://github.com/Autumn-27)

## [0.3.13] - 2026-09-19

### 资产拦截

#### 新增的功能

- **新增全局资产拦截规则（黑名单）**：支持录入全等与模糊匹配的域名 / IP / URL 以及 CIDR 网段，提供规则的增删改查与启用/停用，管理页位于「系统 → 资产拦截」；默认内置模糊拦截政府（`.gov` / `.gov.cn`）与教育（`.edu` / `.edu.cn`）网站。
- **资产拦截接入执行链**：Agent 在下发意图（`add_intent`）与插入资产（`insert_assets`）前先对目标资产做拦截判定——命中拦截的意图不下发、命中拦截的资产不插入，并向 Agent 返回资产信息与拦截原因。
- **新增任务级拦截 / 允许（白名单）规则**：独立于全局规则、仅对本任务生效，判定顺序为「先拦截后允许」——命中拦截即禁止；未命中拦截但本任务配置了允许规则且都不命中，则「不允许测试」；未配置允许规则时不启用白名单。可在创建任务时录入，也可在任务详情「总览」中增删改与启用/停用。
- **任务模板支持预设分类与任务级拦截/允许规则**：模板可保存任务分类与一组任务级规则，应用模板时一并带入新任务表单。

### 操作审查

#### 修复的问题

- **收紧模型裁判输出协议，减少截断导致的误放行**：将裁决说明（comment）上限由 500 汉字下调至 120 汉字并强制「只输出 JSON、不带前言或代码块」，避免裁决被 `MaxTokens` 截断后无法解析、进而按模型失败策略放行（fail-open）。

### 任务归档

#### 修复的问题

- **归档遇到符号链接时跳过而非整包失败**：归档格式端到端仅支持普通文件与目录，此前工作目录中出现任意符号链接都会导致整个任务归档失败；现改为跳过该符号链接并记录日志，其余文件正常归档（不跟随链接、不越出目录树）。

### 账户与合规

#### 新增的功能

- **登录前新增「使用须知与免责声明」弹窗**：需勾选同意后方可登录。

### 许可与依赖

#### 修改的功能

- **项目采用 AGPL-3.0 开源协议**，并完善 README 的许可与免责声明说明。
- **升级 norma 至 v0.4.1**。

### 贡献者

- [@Autumn-27](https://github.com/Autumn-27)

## [0.3.12] - 2026-09-17

### 探索链路播报板

#### 新增的功能

- **任务详情页新增「探索链路播报板」**（#144）：以时间轴流水视角呈现任务的探索节点（起点/目标/意图/事实/漏洞/提示/压缩），支持按类型筛选、关键字搜索、正序/倒序、分页与自动刷新；处于「最新在前的第一页」时为直播位、每轮刷新，离开该位时只累计未读计数、不打扰当前阅读，并以「N 条新播报 · 回到最新」一键返回。按天分组，长任务翻页也能认出「这是哪天的事」。
- **播报板每行显示节点 id**（#145），便于对照探索链路图与定位具体节点。
- **播报板节点详情展开显示上下游与锚定资产**（#147）：展开一条播报可见该节点的上游（由此而来）/下游（由此产生）关系，鼠标悬停关联条目弹出对应节点的名片（类型/状态/来源/时间/摘要/payload 片段）；并顺带列出该节点锚定的资产（类型标签 + 可辨识文本）。相关数据随播报页一并下发，展开不额外发请求。
- **播报板搜索支持按节点 id 筛选**（#150）：搜索框在「内容 / 来源」之外新增节点 id 匹配，输入纯数字或界面展示的「#41」形式即可精确定位对应节点。

### 意图管理

#### 新增的功能

- **意图删除支持「假删除 / 真删除」两种模式**（#149）：待领、运行中、已暂停的意图均可删除，删除需填写原因；删除模式在确认弹窗中选择。
  - **假删除（默认）**：意图置为「已删除」并把原因记入独立字段，保留意图节点与其全部产出、血缘。
  - **真删除**：物理移除该意图，以及「仅由它支撑」的独占子孙节点（沿产出 / 意图链级联到叶子），避免留下孤立数据；被删意图的 Token 计量按原始日期归档保留；共享节点（还被其它意图引用）、目标与任务根事实一律保留，真删除弹窗会展示预计级联影响的节点数。

  两种模式都会通知规划者「该意图由用户删除 + 原因」并据此重新规划。

### 操作审查

#### 新增的功能

- **审批记录支持按状态与判定来源筛选**（#139）：可按审批状态、判定来源过滤审批记录，快速定位目标记录。

#### 修复的问题

- **待处理审批请求独立于历史分页加载**（#133）：待处理请求不再受历史列表分页影响，翻阅历史记录时仍完整可见。

### Agent

#### 修改的功能

- **Worker 角色描述改为通用网络安全平台表述**（#138）。

#### 修复的问题

- **修复冷节点压缩从不触发**：给按任务运行的规划器接上 Compactor，冷节点压缩（cold-digest）此前因未接入而从不执行，现已恢复。

### 聊天

#### 新增的功能

- **聊天支持多类型记录的 @ 引用及滚动分页**（#135）：可在聊天中 @ 引用多种类型的记录，引用候选支持滚动分页加载。

#### 修复的问题

- **长消息气泡约束在会话面板内**（#137）：过长的消息气泡不再溢出会话区域。
- **修复新对话未创建时上传文件报「缺少上传文件」**：Composer 的文件选择在清空 input 之前先把 `FileList` 快照为数组再回调；此前草稿态需先异步创建会话，恢复执行时与 input 活绑定的 `FileList` 已被清空，导致上传缺少文件字段、后端返回 400。

### 流量

#### 修复的问题

- **流量录制代理默认只监听 127.0.0.1**（#129、#130）：避免默认配置下开放代理暴露在其它网络接口。

### Web

#### 修复的问题

- **修复静态导出版任务列表页丢失全局头部**。
- **补齐 demo 漏洞详情页关联流量 mock，修复白屏**。

### 贡献者

- [@Autumn-27](https://github.com/Autumn-27)
- [@RuoJi6](https://github.com/RuoJi6)
- [@dingpotian](https://github.com/dingpotian)

## [0.3.11] - 2026-09-15

### 操作审查

#### 新增的功能

- **审批记录支持来源定位**（#125）：点审批记录的「来源」可跳回触发该次审批的那一次工具执行——打开原始完整会话、自动分页加载到目标位置、就地展开命令与结果并在滚动区居中高亮，前后消息保持可读；用户手动滚动时停止自动校正。跨普通对话、任务 Worker、规划器与主 Agent 分段会话，均通过持久化的 `tool_use_id` 与任务映射精确定位（新增作用域内调用 ID 索引），缺失、重复或关联不明确时显式提示而非跳到其他执行。会话被删除或任务归档/记录缺失时给出明确提示。
- **审批记录支持翻页**（#115）。

#### 修改的功能

- **精简模型审查输入**（#124、#125）：模型审查（规则未命中后的 LLM 裁判）输入收敛为「当前这一次完整工具调用 + 明确选定的简短背景 + 本机工作目录」的版本化 JSON。背景只取真实用户消息（聊天/任务主 Agent 的当前用户消息），Worker 不再附带意图摘要、也清除从上级 Agent 继承的背景；规划器与自动触发会话不补造用户消息。不再附带任务描述、目标、操作约束、全局探索态势、历史调用或 Worker 完整意图——这些仍按原逻辑用于 Agent 执行与独立会话审计，只是不进入操作审查。所有裁决要求输出 JSON 的 `decision`/`comment`，说明必须包含「实际操作、成功后的后果、命中规则」；参数或背景中的指令不能改变审查策略。保存实际发送给模型的输入快照及指纹，旧版快照保留并标注版本，不用当前数据补造旧输入。

#### 修复的问题

- **模型裁决被代码块包裹时不再静默放行**（#126）：模型返回的裁决 JSON 若被 ``` 代码块包裹，此前解析失败会经模型失败策略被静默放行；现在先剥离代码块围栏再解析，解析仍失败才按已配置的失败策略处理。

### Agent

#### 新增的功能

- **新增实验性 noa 上下文压缩**（norma 升级至 v0.4.0）：系统设置中可开启的实验功能，默认关闭。开启后由 noa（模型驱动的上下文压缩）接管主 Agent、规划器、Worker、聊天四类 Agent 的上下文压缩，替代内置压缩；压缩原文持久化归档，集中落在 `<workDir>/noa/<会话ID>/` 下（不分散在各任务目录内），按会话 ID 全局唯一分目录。接入失败自动回退内置压缩，不中断真实任务；开关每次运行读取一次，切换只影响之后启动的运行。

#### 修复的问题

- **探索图工具在无任务上下文时拒绝而非 nil 崩溃**：非任务上下文调用探索图相关工具时返回明确错误，不再因空存储解引用崩溃。

### MCP

#### 新增的功能

- **支持旧版 SSE MCP 服务**（#117）：兼容仅提供旧式 SSE 传输的 MCP 服务端。

### 流量

#### 修复的问题

- **流量检索按端口感知匹配记录的主机**（#114）：`traffic_search` 的主机匹配纳入端口，避免不同端口的同主机记录相互串扰。
- **`traffic_search` 描述迁移出错不再中断后续 reporter 迁移**：单条迁移失败被隔离，不影响后续迁移执行。

### Web

#### 修改的功能

- **任务复测漏洞选项增加分割线**（#122）：复测漏洞选择项之间增加分隔，视觉更清晰。

#### 修复的问题

- **修复 demo 任务详情页整页崩溃**：mock 模式下任务详情「会话」标签会去拉 `GET /api/tasks/<id>/side-questions`（旁路提问历史），但 mock handler 没有这条路由，被读兜底按“路径以 s 结尾即集合”返回了 `[]`，导致 `data.items` 为 `undefined`，旁路 hook 的 `merge()` 对其迭代抛 `TypeError: t is not iterable`；该异常发生在 `setItems` 的 updater 里、被 React 推迟到 render 阶段重抛，调用方 `catch` 接不住，整页被错误边界接管显示 “This page couldn't load”。现在 mock handler 显式返回空的旁路历史，`sideAPI.history` 也对返回值做归一化（`items` 非数组一律兜成 `[]`）作为防御纵深。

### 贡献者

- [@Autumn-27](https://github.com/Autumn-27)
- [@RuoJi6](https://github.com/RuoJi6)

## [0.3.10] - 2026-09-13

### 网络

#### 新增的功能

- **网络搜索新增 DeepSeek 官方来源**：直接复用当前激活的 LLM 配置。它与其余三个来源性质不同——DeepSeek 没有可直接调用的搜索接口，搜索只存在于其 Anthropic 兼容接口内部（`web_search_20250305` 服务端工具），由 DeepSeek 服务端执行。因此它**仅支持 DeepSeek 官方端点 + anthropic 协议**（OpenAI 协议端点会直接拒绝服务端工具），且每次搜索会**额外消耗一次模型调用**、请求**不经过搜索出口代理**、也**不计入流量留痕**，返回结果**只有标题与链接**（无摘要，需正文时由 WebFetch 抓取）。设置页说明上述限制但**不做校验拦截**，是否满足由用户自行确认，可用「测试搜索」按钮实跑一次验证。

### Agent

#### 新增的功能

- **worker 获得跨 work 回看能力**：新增 `search_all_worker_traces`（不必先知道 intent_id，按关键字在本任务所有 work 的执行过程里全局检索命中步骤）与 `get_worker_trace`（锁定某条 work 后列步骤流、就地按关键字搜、按 step_id 取完整内容），用于复用别的 work 见过却没写进 fact 的观察、避免重复劳动。
- **`node_detail` 下放给 worker**：配合上面的回看工具，worker 拿到 intent_id / 节点 id 后可直接查该节点的完整详情。
- **`add_hint` 触发的规划轮会被显式播报**：此前新增提示只把 hint 折进态势总览、让规划者自己发现；现在一次 `add_hint` 会给规划者记一条「人新增了 N 条战略提示：…」触发（批量算一条，不逐条刷屏），规划者被明确告知“本轮由新增 hint 触发”并直接看到提示内容。

#### 修改的功能

- **全局态势提示改为“松绑”口吻**：鼓励探索发散、跨意图线索及时上报，而非过早收敛。
- **精简 worker 边界措辞**：初次受阻不代表探透，聚焦“把本意图内的绕过手段走完再下结论”。
- `insert_assets` 移除每条资产的 `related` 入参：它唯一的作用是决定要不要把这条资产加进本任务范围，值又不落库（同一资产被再次登记就作废、界面上也看不出谁被判为无关），实际只是让模型多做一次留不住的判断。
- **测试范围(`task_scope`)不再受资产覆盖度开关影响**：`insert_assets` 的自动入范围(`source='auto'`)无论覆盖度开启与否都执行，`add_task_scope` 也始终提供给 planner / 任务内主 Agent / 目标拆解 Agent。范围是任务的授权边界、资产查询的过滤基准，覆盖度开关只决定要不要拿它当分母算指标，不该决定要不要累积范围本身。此前关闭覆盖度会让 `auto`/`agent` 两条写入路径同时失效，`task_scope` 只剩界面手工添加的行。`list_untested_assets` 仍随覆盖度关闭而隐藏（它本身就是纯覆盖度视角）。

#### 修复的问题

- **修复任务间资产互串**（#59）：`list_assets` 此前把任务 id 写死为 0、裸查整个共享资产库，模型又无从写出范围过滤条件，于是把别的任务的资产（尤其 IP）当成本任务目标，测试方向被带偏。现在它只返回落在【本任务及直接关联任务】测试范围(`task_scope`)内的资产，按**归属**匹配而非字面值：范围里有某根域即可查到其名下全部子域/服务/接口，有某网段即可查到段内主机及服务；按 id 直取范围外资产同样取不到。非任务上下文(Auto/pentest)无范围可依，仍回退全库。顺带修复 IP 直连主机(如 `http://1.2.3.4/api`)无法被网段范围命中的归属盲区。UI 的「测试资产」视图（按任务生产者过滤）不受影响。
- **修复 worker 跨 work 回看工具被误删**：`search_all_worker_traces` / `get_worker_trace`（以及 `node_detail`）加进 worker 默认工具集后，被一段“收敛 worker 工具面”的旧迁移在启动时又解绑掉，导致 worker 实际拿不到这些工具。已把它们移出该解绑清单，并对已跑过旧迁移的库一次性补绑回 worker。
- **修复 `/btw` 旁路提问偶发入库失败**：side_question checkpoint 落库前剥除 JSONB 不支持的 NUL(`\u0000`) 转义，避免含该字符的内容写入报错。

### 触发器

#### 修复的问题

- **合并触发会话按任务去重任务描述/目标**：多任务合并触发时，同一任务的任务描述/目标不再重复拼进消息，避免长目标反复堆叠把上下文撑爆。

### 贡献者

- [@Autumn-27](https://github.com/Autumn-27)

## [0.3.9] - 2026-09-11

### Agent

#### 新增的功能

- 任务内主 Agent 支持**多会话**：可新建、切换、独立重置上下文，每个会话都能交互。
- 支持持久化的 `/btw` **旁路提问**：不打断主线追问，问答落库，重启后仍在。
- `spawn_task` 新增 `source_task_ids`，新任务可**只读继承**来源任务的资产与发现。

#### 修改的功能

- 关闭 worker 的跨 engagement 记忆并收敛其默认工具面：读上下文、跨 work 复盘属规划职责，worker 只管单条意图的执行与写回。
- 精简 worker 默认提示词；`get_worker_output` 移除 `terminated` 与 `worker_name` 字段；精简 `insert_assets` / `list_assets` 的描述。

#### 修复的问题

- 修复 work 因**空转回合**提前中断的问题：模型有时会用一整轮只输出思考，既不给正文也不调工具，此时 harness 看到的是一次自然结束（`end_turn` 且无 `tool_use`），直接以 `completed` + 空总结收场——一条还没做完的意图就断在半路，表现为「任务正常结束但没有任何文字总结」。五层 LLM 重试一层都够不着它：它不是错误，同 provider 安全窗口重试的入口是"流失败"，熔断在 `err == nil` 时直接判成功，意图重跑只认 `model_error`；SDK 的空响应重试也够不着，因为那层以"有没有 yield 过事件"判空，而思考增量本身就是事件。现在 work 的 Stop 钩子会识别这种回合并注入一条续跑指令，让模型带着已经产出的思考继续执行下一步——刻意不选"原样重发"，因为这类空转通常由提示词与上下文形状决定，是稳定行为而非随机抽风，重发只会让模型再想一遍。
- 次数复用 LLM 页「重试与退避」里的**空响应重试次数**（两者都在回答"模型完成了却没产出实质内容"，只是判据与手段不同），默认 2 次，填 `-1` 即关掉、退回原先"空转即收场"的行为。它是一条意图的**总量**上限而非连续次数：harness 自身已限死连续空转只推一次，只有真正发生过工具回合配额才刷新，所以这个数挡的是「工具 → 空转 → 推 → 工具 → 空转」这类循环把意图预算耗光。触发时日志记 `[work <worker> · #<意图>] 空转回合…注入续跑指令 (n/N)`。设计见 `docs/LLM重试设计.md` §1.1。
- 修复长对话下 `/btw` 的上下文预算与输入布局；非安全上下文（非 HTTPS 访问）降级生成旁路请求 ID。

### 流量

#### 新增的功能

- 漏洞支持**关联多条流量证据**，可排序、加备注、按角色区分（请求/响应/佐证）。
- 报告 Agent 会在写报告前**自动关联**相关流量证据。
- 新增 Agent **流量绑定开关**，并补齐证据在 Agent 之间的交接。

### 任务

#### 新增的功能

- 支持**会话级漏洞复测**：复测跑在独立 Agent 会话里，列表与详情显示运行状态。

### 拦截

#### 新增的功能

- 审批记录新增**详情与执行审计**：可查看工具请求上下文、模型/规则初判、执行输出与参数指纹。

### 资产

#### 新增的功能

- 任务测试资产支持 **DSL 搜索**。

### LLM

#### 修复的问题

- 修复测试连接未补发自定义会话头，导致 opencode zen 返回 400 的问题。

### 网络

#### 新增的功能

- MCP 的 HTTP 传输支持**跳过 TLS 证书校验**，便于接入自签证书的服务。

### UI

#### 新增的功能

- 会话列表按 Agent 分组，支持展开收起与独立置顶；对话支持按 Agent 筛选。
- 攻击链路图渲染压缩（digest）节点，并收缩其成员。

#### 修复的问题

- 修复登录凭据不同步导致的白屏。
- 拦截提示文案改为明确标示「平台管控」，避免被误读成目标侧的防御。

### 部署与更新

#### 新增的功能

- 支持**页面一键更新**：系统配置页新增「版本与更新」卡片，顶栏在有新版时亮出提示。流程为下载发布包 → 校验 `SHA256SUMS` → 冒烟测试 → 暂存 → 退出由守护脚本重新拉起完成换装，页面自动刷新。
- 新增守护启动脚本 `start.sh` / `start.bat` 作为正式启动入口（发布包与 Docker 镜像均已带上，`install.sh` 不变），按退出码决定是否重新拉起，并负责把 SIGTERM 转发给 bladepro 本体。校验与换装逻辑都在 Go 里，脚本保持傻瓜化。
- 失败自动兜底：校验或冒烟不通过就丢弃、继续跑当前版本；新版连续 3 次启动失败则回滚上一版本。设置页另有手动回滚（注意数据库结构不会回退）。
- 更新只认 GitHub 域名且强制 HTTPS，发布源不可配置；开发构建禁用一键更新。GitHub 查询结果缓存 30 分钟，避免顶栏提示耗尽 API 配额。

#### 已知限制

- Docker 下只换程序、不换镜像：工具链不会跟着升级，且重建容器会退回镜像自带版本，需要时仍用 `docker compose pull bladepro`。
- 不同步发布包里的 `skills/`，新版新增的内置 skill 不会自动生效。
- 更新即重启，会中断正在运行的任务。

### 依赖

#### 修改的功能

- 升级 norma 至 v0.3.7。

### 贡献者

- [@Autumn-27](https://github.com/Autumn-27)
- [@RuoJi6](https://github.com/RuoJi6)

## [0.3.8] - 2026-09-09

### LLM

#### 新增的功能

- LLM 页新增「重试与退避」标签页：五层重试的**次数**与**间隔**都可以配。一次模型调用的失败由内到外经过建连重试（SDK，流开始前的连接重置 / 超时 / 429 / 5xx）、空响应重试（SDK，正常结束却没有任何内容，仅 openai 格式）、同 provider 安全窗口重试（未向调用方交付任何输出前的断流重放）、轮询熔断（连续失败到阈值就冷却跳过）、意图重跑（worker 以 model_error 收场后整条意图重跑）五层，内层用尽才轮到外层。每层两个旋钮，语义统一：留空 = 用原本的默认次数与指数退避；填次数就用该次数；填间隔就把指数退避换成固定间隔；填 -1 = 关掉这层重试。前三层跟着端点走，可在每个模型配置里逐字段覆盖全局默认（只钉间隔的仍继承全局次数）；熔断与意图重跑是进程级语义，只有全局一份。保存后热生效，不需要重启。全部留空即当前行为，旧库升级后逐字节不变（新列默认 0、settings 键不存在即全默认）。连接测试刻意不带这些参数——它有 30s 硬超时，叠上用户配的重试只会把能用的端点测成超时失败。设计见 `docs/LLM重试设计.md`。
- 每个 LLM 配置支持自定义**会话头**（`session_header_key`）：非空时每次 LLM 请求都会带上该 HTTP 头，头值为当前运行的 session id（chat 会话为 `conv-<id>`、worker 为 `exp<x>-worker-i<intent>` 等），用于某些按 session-id 头做提示缓存 / 粘性路由的网关。实现上从请求 context 里读取 session id 注入，无需改 norma，同一共享 provider 也能按会话发出不同头值。旧库带迁移，前端 LLM 配置弹窗新增输入框。

#### 修复的问题

- 修复保存 LLM 配置时因会话头字段为空直接报 `23502` 的问题：该列是 `NOT NULL DEFAULT ''`，此前误套 `NULLIF($n,'')` 把未填写的会话头写成 NULL 触发非空约束，现按空串语义直接传参。

### Agent

#### 新增的功能

- 墙钟超时改为**就地收尾**：依赖 norma v0.3.6，`MaxDuration` 到点会打断正在跑的工具并在活 ctx 上按收尾轮数续跑（写回已识别内容 + 总结，终态为 timeout），不再依赖 worker/planner 各自的 `maxDur+90s` 外部硬 ctx 把卡住的 run 直接杀成 `aborted_tools`。chat 走同一 harness 自动获得同样行为，mainagent 无 `MaxDuration` 不受影响。
- 停摆兜底：planner 在心跳 / 无变动唤醒且全图已无任何 open 或 running 意图时，开场白改为停摆告警，明确告知无 worker 在跑、无排队方向，本轮必须产出一个或多个互不重复的新意图（不得产出 0 意图）。

#### 修改的功能

- worker 提示词重构：意图 / 启动指令 / 锚定资产原始 JSON 移入 system prompt，每轮重拼、绝不被 compaction 压掉，续跑也不依赖 transcript 首消息留存；启动 user 消息瘦身为仅全局态势 overview（可降级、容忍 stale）。代价是 system 混入 per-intent 数据、失去跨意图缓存复用，是「不丢意图」的刻意取舍。
- 精简 planner / worker 默认正文并修正若干实战问题：planner 对 `recent_done` 按状态区分（blocked/exhausted 先查 trace 再决定，不当死路也不无脑重跑）、否定结论改为「观察 / 存疑、非定论」且采信前看 evidence、目标未达成且无 open/running 意图必须产出（硬底线）、深度优先于覆盖度；worker 否定类结论只写「观察 + 试探性读法」、判决权归 planner，跨意图线索写进 fact 的 summary 交规划者、不自己追。reseed 会把新默认作为新版本追加并切过去，用户自定义 / 旧版本保留在历史可回滚。
- 收敛 work agent 默认工具集与资产写回提示：worker 只负责单条意图的执行与写回，读上下文 / 跨 work 复盘属规划职责，故从其默认工具移除 `list_facts` / `node_detail` / `list_companies` 及跨 work 检索（`search_all_worker_traces` / `list_worker_traces` / `get_worker_trace`），只留 `list_findings`（报漏洞前查重）+ `add_finding` / `record_fact` + `insert_assets` / `list_assets`；提示词删掉与 `insert_assets` schema 冲突的陈旧字段说明（`type=tech`/`on_url`/`props`）。旧库带一次性迁移剥离对应绑定，planner/main 的同名绑定不动。

### 探索图

#### 新增的功能

- **探索图冷节点压缩（cold-digest）**：把老且长期不活跃的意图 / 事实折叠成 digest 节点在 `graph_overview` 里展示，原始节点永久保留、按 id 可完整还原（存储无损、只压呈现、折叠可逆）。冷热判定按逆向可达 + 任一活分支即热，配 R=6 轮防抖与连通分量分组；后台压缩（minor 折未覆盖冷块、major 回源重压合并碎片）带活跃度复核与冷却互斥，绝不上热路径也绝不覆盖已复活节点。概览侧提供 `cold_digests` 与按资产索引的 `cold_index`，`expand_digest` / `expand_index` 负责还原。关联 / 继承任务的概览同样复用其自身折叠视图，`expand_digest` 支持跨任务只读还原。`expand_digest` / `expand_index` 只给 planner 与 main agent，不给 worker。均带旧库迁移。
- `graph_overview` 全量输出 `finding_list`：findings 是任务最高价值产物且单任务通常不多，改为在概览里全量带出（不像 facts 只给最近窗口），planner/worker 每轮即可一眼看全所有确认漏洞，无需再调 `list_findings`。每条精简为 `{id, summary, evidence?, from_intent?, assets?}`，其中受影响资产直接给可读内容（url / 域名 / ip:port）而非裸 id。

#### 修改的功能

- `graph_overview` 不再平铺 `hosts`：coverage 块移除 host 列表（大范围任务里每轮最多携带 500 个 host 字符串，对规划决策价值有限），只保留 `host_count`，具体主机按需 `list_assets` 查。新增顶层 `done_intents_total`（已结束意图总数），与被截断到 ≤15 的 `recent_done_intents` 平行，让 planner 去重时知道有无被截。

### 工具

#### 修改的功能

- `add_company_scope` 默认绑定由 worker 改为 planner：定义企业资产范围属规划 / 主控 / Auto 的职责，worker 只执行探索。新库 seed 默认绑定为 mainagent/planner/auto，老库带一次性迁移。
- planner 默认绑定 `list_assets`：现同时具备 `list_assets`（DSL 全库检索）与 `list_untested_assets`（范围内未测），老库一次性回填、不覆盖用户解绑。

### 任务

#### 新增的功能

- 任务列表新增「运行中 Worker」列：统计该任务下 `state='running'` 的意图节点数，口径与任务详情页概览的「运行中 Worker」完全一致，无运行中 Worker 时显示 0。

### 网络

#### 新增的功能

- 新增**全局出口代理**配置：所有目标流量可经统一的全局代理出网（http/https/socks5，支持 `user:pass`）。开启流量捕获时作为 MITM 记录代理的上游（流量照录再经代理出网，拦截与透传两条路径都走上游、不泄露源 IP）；关闭捕获时直接注入 agent 的 bash 环境与 WebFetch（`proxyEnv` 增加 `ALL_PROXY` 支持 socks5）。配置存于 settings KV 表（无需迁移），前端系统配置页新增「全局代理」卡片，与网络搜索代理、LLM 代理相互独立。

### UI

#### 修复的问题

- 修正意图状态标签的语义错误：`exhausted`「已穷尽」→「预算耗尽」（实为达步数 / 时间预算被中途掐断、只写回部分结果，并非该方向已探尽）、`blocked`「被拦截」→「执行出错」（实为模型 / API / 网络故障重试用尽、意图基本没真正探成，并非目标 / WAF 拦截），并补上此前缺失的 `stopped`「已停止」（用户手动停止的 work）。

### 依赖

#### 修改的功能

- 升级 norma 至 v0.3.4：MCP 工具输出增加截断与落盘（见 `651b961`），后续 v0.3.6 支撑墙钟就地收尾。

### 贡献者

- [@Autumn-27](https://github.com/Autumn-27)

## [0.3.7] - 2026-08-31

### LLM

#### 新增的功能

- 模型配置新增「输出上限」，并可选择上限用哪个请求字段名：上限限制单次回复最多生成多少 token，随每次请求发出，0（默认）= 不发送该字段、由服务端默认值决定；它与「上下文窗口」是两回事——后者是模型总容量，只在本地用来算压缩阈值，不出现在请求里。字段名开关仅对 `openai`（Chat Completions）格式有意义：空（默认）发 `max_tokens`，绝大多数兼容网关只认它；OpenAI 官方推理模型（o 系列 / GPT-5）反过来只认 `max_completion_tokens`，收到 `max_tokens` 会直接报 `unsupported_parameter`，这类端点需手动切到新字段。两种格式各自定死了字段名（Anthropic 为 `max_tokens`、Responses API 为 `max_output_tokens`），故非 openai 格式该开关置灰并在保存时清空。同时补上一条此前从未接通的链路：planner / worker / chat / 主 Agent / 目标拆解五处都没设过输出上限，openai 系压根不发、Anthropic 走 SDK 的 8192 兜底，光加配置项而不接这条线，填了数字也不会生效；现在取值与「流式输出」一样按配置每轮解析，故障转移切换后下一轮即生效。旧库升级后行为完全不变（新列默认 0 与空字段名）。
- 后台点「测试」时把每次 HTTP 尝试的状态码与网关原始响应体打进服务端日志（响应体裁到 4K），便于诊断 401、额度文案、空帧、返回 HTML 页面等情况，不再只能看到 UI 折叠后的 ok / err。该日志不依赖「LLM 记录」开关。

#### 修改的功能

- 任务 LLM 配置链改为任何状态都可修改，不再限制「运行中 / 暂停 / 配置链耗尽」：任务结束（done / failed / timeout）后主 Agent 对话仍走这条链，链上模型出问题时原先既不能改也就没法继续交互。后端 HTTP 与 DB 事务两处终态拦截一并去掉，前端弹窗对终态任务也开放编辑与保存。终态任务保存时不再重开额度阻塞意图（那些意图会被挪到 open，既没有 worker 执行、也不再满足「重跑意图」的条件），想继续跑仍走重跑意图 / 新增目标，由它们把任务重新拉回运行态。

### Agent

#### 修改的功能

- 「给运行中的 Worker 发消息调方向」改为复用已有的暂停 / 恢复 + transcript resume 机制，行为与主 Agent 对话一致：此前走的是一套自建的介入持久化协议，牵动调度屏障、恢复流程与十余处活动查询过滤。现在消息经下一轮输入注入，意图在专属 goroutine 里直接跑，不受 3 槽 worker 池限制、随发随跑；前端保留消息框并恢复「直接继续」按钮，发送改由 SSE 承载。无 DB schema 改动。取舍：消息仅存内存、不做崩溃恢复，且发消息时该任务可能瞬时超并发一个 worker（低频场景，可接受）。

### 任务

#### 修复的问题

- 修复归档大型任务时内存耗尽（OOM）崩溃的问题：归档改为流式写入快照，不再把整个任务一次性读进内存；同时补齐冷归档路径上的三处恢复缺口——现代安装的流量只存在 SQLite 里，此前在 PostgreSQL 提交与 SQLite 提交之间崩溃会让已归档任务的流量滞留在热存储且无从恢复，现在无论有无历史目录都会写暂存日志，缺失的 `journal.json` 也按可丢弃处理。
- 修复任务较多时系统卡顿的问题：加载对话与加载界面存在明显延迟。任务列表、任务上下文与探索记录的查询一并优化，前端的仪表盘、对话页与任务详情页同步减少了重复请求。

### 资产

#### 修改的功能

- 去掉企业资产范围「最多 256 条规则」的限制：逐个 IP / 域名录入范围的企业很容易撞上这个上限，撞上之后只能拆成多个企业，而范围本身并不因为条数多就更慢。前后端与 demo mock 三处上限一并移除，单条规则仍限 1024 字符，请求正文 2 MiB 的上限保留作兜底（约合四五万条规则）。

### 技能

#### 修复的问题

- 修复上传技能压缩包报「上传失败：zip: unsupported compression」的问题：Go 标准库只内置 Store / Deflate 两种解压器，压缩软件在非默认档位下写出的 bzip2、Zstandard 包一律解不开。现在补上这两种解压器（纯 Go 实现，不引新的外部依赖）；Deflate64 / LZMA / XZ / PPMd 等确实解不了的方式，以及加密压缩包，改为在解压前就报出中文提示，直接点名是哪个文件用了哪种压缩方式、该怎么重新打包，不再把底层英文错误甩给用户。
- 修复技能内文件名校验把中文文件名判为非法的问题：路径校验原先是 `[A-Za-z0-9-_./]` 的 ASCII 白名单，压缩包里只要有一个中文命名的文件（`参考/说明.md` 之类），整包上传就会以「压缩包含非法路径」失败。改为 Unicode 黑名单：允许各种语言的文件名与空格，仍然拒绝控制字符、非法 UTF-8、零宽与双向控制字符（RLO 文件名伪装）、`\ % # ? * : " < > |` 以及 `..` / 绝对路径 / 空路径段，防目录穿越的行为不变。技能名同样放开——ASCII 仍限小写字母、数字与连字符（agentskills.io 规范），中文等非 ASCII 字母可直接作技能名，但不接受空格、点和路径分隔符。
- 修复 Windows 压缩软件打出的中文包解压后文件名乱码或整包被拒的问题：这类 zip 不置 UTF-8 标志位、按 GBK 写文件名，现在按 GBK 兜底解码后再做路径校验。同时 `name: "中文技能"` 这种带引号的 frontmatter 也能正确取到技能名。

### UI

#### 新增的功能

- 发现页新增「全部发现」平铺视图并设为默认，与原「按任务分组」视图通过页头 Tab 切换：分组视图要逐个任务展开才看得到漏洞，只想跨任务扫一眼列表时反而绕路。平铺视图是一张跨任务大表（每页 10/20/50/100 条），行为与分组视图完全一致——勾选导出、行内展开看证据与详细报告、行内改名称/类别/严重度、改处置状态、深入、删除。两个视图共用统计卡片与筛选条，切换不丢筛选，当前视图与筛选项一并记在本地；轮询只打当前视图，行内改动会同步写两边缓存，切过去不会看到过期数据。
- 发现页新增「按资产」视图：左侧资产树（企业 → 根域名 / IP → 子域名 → 服务 → 接口，企业层只在资产确实有归属时才出现），右侧是选中节点整棵子树下的发现，与另外两个视图共用同一张表和同一批筛选条件。树只收有发现的资产，祖先链按需补齐（发现只挂在最深的接口上时，上面几层照样能拼出来），节点上的计数是子树聚合并按发现去重的；资产已删除或本就没关联资产的发现进「未关联资产」桶。与另外两个视图不同，资产视图不轮询——进入视图、改筛选、页内增删改发现、或点树上的刷新按钮时才查询，左树是导航结构，没必要每 5 秒重算。树上每层只显示相对上一层的增量（子域名去掉根域名后缀、服务显示 `https :443`、接口只显示路径），完整值在悬停提示与面包屑里；节点过多时整层丢弃接口/服务层级并给出提示，计数仍计入上层。

#### 修复的问题

- 修复手机端会话详情里会话记录被挤压看不全的问题：窄屏下折叠会话列表，把宽度让给记录本身。

### 依赖

#### 修改的功能

- 升级 norma v0.3.2 → v0.3.3：新增 `Config.MaxTokensField`，让 OpenAI Chat Completions 的输出上限可以改发 `max_completion_tokens`（推理模型只认这个键）。两个键互斥、只发其中一个，默认仍是 `max_tokens`。
- 升级 `golang.org/x/mod` v0.37.0 → v0.40.0，修复两处依赖安全告警。

### 贡献者

- [@Autumn-27](https://github.com/Autumn-27)
- [@neouks](https://github.com/neouks)
- [@begininvoke](https://github.com/begininvoke)

## [0.3.6] - 2026-08-27

### LLM

#### 修复的问题

- 修复「非流式」开关保存后重新打开又变回「流式」的问题（#69）：配置列表接口的 DTO 漏了 `streaming` 字段，响应从不返回它，前端读到 `undefined` 后一律回落成默认流式；实际写入与 DB 存储本无问题，只是读不回来。DTO 补回该字段（不加 `omitempty`，`false` 也必须出现在响应里）。
- 测试连接改为校验模型确有回复、并按该配置真实的收发模式来测（#65）：此前只判 HTTP 是否成功，请求通但模型零回复（思考烧光预算 / 正文被安全策略吞掉 / 兼容层丢 `content`）也报「连接成功」，与会话里「不回话」的表现割裂；且测试恒走流式，非流式配置测的其实是另一条通道。现在空回复直接判失败、成功时在提示里展示模型回复，并把当前流式开关一并带入测试，让「测试通过」与「会话跑得通」保持一致。

### Agent

#### 修改的功能

- `list_facts` 改为分页 + 关键词过滤，避免事实多时单次调用撑爆上下文（#74）：默认返回最新 20 条，支持 `limit`（上限 100）/ `before` 游标 / `q` 摘要关键词，返回 `{facts, total, has_more, next_before}`；单条 summary 过长按字数截断（全文仍走 `node_detail`）。worker / planner 提示词同步为分页语义。旧库通过一次性迁移把新参数 schema 刷进工具目录表（`SeedTool` 首插入only，否则工具管理页显示「无参数」）。

### 工具

#### 新增的功能

- 「工具执行」页新增工具调用次数统计（#72）：工具栏「统计」按钮打开弹窗，按工具展示调用次数、占比与失败次数（次数降序）；沿用列表的任务 / 关键词筛选，统计整个结果集而非当前页，弹窗打开时才拉取。

### 依赖

#### 修改的功能

- 升级 norma v0.3.1 → v0.3.2：修复 OpenAI 系响应里被静默丢弃的 reasoning/refusal（Responses 补 `reasoning_text`）、reasoning 字段三名去重、空响应（零内容块）有界重试、压缩边界切断工具配对导致的网关 400（同时修复已烤进 transcript 的存量孤儿）。

### 贡献者

- [@Autumn-27](https://github.com/Autumn-27)

## [0.3.5] - 2026-08-25

### LLM

#### 新增的功能

- 每个 LLM 配置支持流式/非流式切换（默认流式）：开走流式 SSE；关走真·非流式（`stream:false`、一次性返回完整 JSON），可绕开部分网关糟糕的 SSE 实现（空帧、思考字段丢帧），代价是失去运行中的实时进度与实时 Token 计数。worker / planner / mainagent / chat / goals 均按当前激活配置动态取值；`llmpool` / `llmrec` / 任务运行时三层 Provider 包装均兼容非流式；`llm_profiles` 新增 `streaming` 列并 `ALTER` 补旧库（默认 `true`，旧配置无感）。
- 支持 OpenAI Responses API 格式的 LLM 配置：每个配置新增第三种格式 `openai-responses`（打 `POST /v1/responses`），与 Chat Completions / Anthropic 并列；`BaseURL` 归一化、默认模型 `gpt-5`；`llm_profiles` 的 `format` 约束加入 `openai-responses` 并幂等迁移补旧库；前端格式下拉新增「OpenAI (Responses API)」。依赖升级 norma v0.3.1（含 `reasoning_content` 回传修复）。
- 录制 LLM 请求/响应 HTTP 原文：在 HTTP transport 层捕获真实 wire body，保留归一化视图看不到的工具 schema、`tool_use` 块与原始 SSE 帧；norma 内部重试的多次尝试逐次保留；`llm_records` 新增 `raw_request` / `raw_response` 两列并 `ALTER` 补旧库；录制页详情面板增加「原文」视图切换与请求/响应复制按钮（兼容非安全上下文的 `execCommand` 回退）。

### 对话

#### 修改的功能

- 会话列表多选改为「多选」模式开关：默认列表不再常驻每行勾选框（观感更干净），表头改为「共 N 个 + 多选」按钮；点「多选」进入选择模式（勾选框、全选、批量删除），「完成」退出并清空选择，批量删除全部成功后自动退出（有失败则留在选择模式便于重试）；单条重命名 / 置顶 / 删除仍走每行 ⋯ 菜单。

### UI

#### 修改的功能

- 任务管理、会话操作与流量查看体验增强（#57）：任务列表列排序偏好可持久化记忆、行内重命名改用图标直接触发（不再经菜单）、抽屉（sheet）交互与流量查看细节优化。

#### 修复的问题

- Worker 资产标签只显示域名与 IP，并正确处理空标签的场景。

### Agent

#### 新增的功能

- planner 判目标时新增「量化验收核对」：目标含可量化验收条件（资产测试覆盖度达到 X%、拿到 N 个 flag、获得某权限）时，`prove_goal` 前必须核对 `graph_overview` 的实测值（`coverage.pct`、findings 计数等），实测未达标则禁止 `prove_goal`、改为派意图补足差距，不得以「主要部分已完成/大体达成」为由提前标 met。修复了目标要求覆盖度 100%、实测仅 40% 却被判完成的问题。

#### 修改的功能

- 重写 planner 提示词中「本轮 0 意图」的判定依据：原文将 0 意图描述为「最常见、最重要的原则」，会让规划者在目标未达成、范围内仍有未测面时过早收手。现改为只在两种具体情况下才应产出 0 意图——① 想到的方向都已被 open/running/recent_done 意图覆盖；② 下一步依赖当前正在运行的 work 的产出、而产出尚未出现（应等其跑完、图更新后的下一次唤醒再规划）。并补充反向约束：确有未被覆盖且不依赖在跑 work 的新方向、或目标未达成且仍有未测面时，不要因「0 意图常见」而收手。
- 强化 worker 提示词中「否定结论的证据门槛」：对「不可注入/端口关闭/无登录入口」等可能让规划者放弃一整条方向的否定结论，要求下结论前先穷尽该意图内的合理手段（换编码/参数/路径/方法）；手段未走完或证据偏弱一律标 `confidence=inferred`，避免用轻率的 `observed` 否定把整条路线焊死（任务早期的错误否定尤其会把方向带偏且难以自愈）。
- 上述 planner / worker 默认提示词变更通过一次性迁移（`reseedPlannerPrompt` / `reseedWorkerPrompt`，各带 settings flag 守卫）追加为新版本并切为当前版本；旧版本保留在版本历史中，自定义过提示词的用户可在版本记录里恢复。

### 运维

#### 新增的功能

- 新增 `reset-password.sh` 重置管理员（用户名固定 `BLADEPRO`）密码：支持 local / docker 两种部署，连接信息可显式指定或自动从 `--dsn`/`$BLADEPRO_PG_DSN`/`config.json` 读取；在库内用 `pgcrypto` 生成与后端登录兼容的 bcrypt 哈希并写回 `settings.auth.password_hash`，重置后无需重启服务。密码经环境变量传入、不进入进程 argv，并做转义防注入。

### 贡献者

- [@Autumn-27](https://github.com/Autumn-27)
- [@neouks](https://github.com/neouks)

## [0.3.4] - 2026-08-24

### UI

#### 新增的功能

- 任务列表勾选多个任务后可批量修改分类，目标分类支持「未分类」以将任务移出当前分类；整批写入在一个事务内完成，失败项只会是勾选后已被删除的任务。

#### 修改的功能

- 新建任务的「任务分类」由下拉选择改为可搜索输入框：输入即过滤已有分类，库里没有的名称回车（或点下拉里的「创建」）即时新建并选中，选中项以可移除的 tag 展示；仍限单个分类。

### 对话

#### 修复的问题

- 修复会话已选定 LLM 配置、但全局无激活配置时，发送消息被「LLM 未配置，无法对话」拦截的问题。发送前的检查原本只看全局激活配置，而实际执行会优先用会话所选配置，两处解析逻辑不一致；现统一为同一套（会话/Agent 绑定优先，全局兜底）。
- 无法对话时的提示按状态细分：完全没有配置提示「添加配置」，有配置但未激活提示「激活或为本会话指定一个配置」，不再一律显示「未配置」，便于定位。

### Agent

#### 新增的功能

- 目标已全部达成的任务，主 Agent 经 `add_intent` 下发的意图可被 Worker 直接领取执行、跑完即止：此时 Planner 不再运行（任务无 open 目标即不进规划），避免其重判目标达成而取消刚下发的意图；frontier 抽干后任务回到已完成。主 Agent 下发意图前会依据意图内容反问用户是否将其登记为正式目标，登记则任务恢复常规自主规划。

#### 修改的功能

- `get_worker_trace` / `get_task_worker_trace` 的 `step_ids` 超过一次上限（5 个）时不再直接报错，改为返回前 5 步的完整内容，并在结果中通过 `returned_step_ids` / `omitted_step_ids` / `notice` 告知本次取了哪些、还有哪些未取，并提示「若已足够则无需再取」。传入的重复与非法 id 会先去重、剔除后再计数。

#### 修复的问题

- 任务列表改为按任务 id 降序（最新创建在最前），替换原先的按创建时间排序。同一时刻创建的多个任务时间戳相同、排序不稳定，配合每 10 秒轮询和内存 map 的随机遍历，会导致它们在列表里频繁互换位置。

### 资产

#### 修复的问题

- 修复企业归属重算被单行脏数据打挂：`assets.ip` 存了主机名（Agent 或资产 API 写入）时，`a.ip::inet` 会抛 `22P02`，导致新增/修改企业资产范围和删除企业全部失败并回滚。改用安全转换 `try_inet()`，非法值跳过而不是中断整条语句。
- 无法解析的 `ip` 不再静默跳过：企业范围保存后会明确提示有多少条资产的 `ip` 不是合法 IP（含具体 id 和取值），提醒这些资产不会被 IP/CIDR 规则归属；同一信息也写入服务端日志，覆盖没有前端响应的路径（删除企业、scopesentry 同步、Agent 写入）。
- 任务测试范围的 IP/CIDR 匹配同步改用 `try_inet()`，替换原先只检查字符集的正则守卫（`abc.def` 这类全 hex 字母的主机名此前仍会漏过并触发同样的报错）。

#### 修改的功能

- `ip`、`service`、`endpoint` 资产的 `ip` 字段不再接受主机名：`insert_assets` 和资产 API 会逐条返回带 `index` 的错误，并直接给出改正方法（改用 `type=subdomain` 填 `domain`，或先解析 A/AAAA 记录），Agent 可据此自行修正后重插。同批次中的其他资产不受影响，照常入库。

### 贡献者

- [@neouks](https://github.com/neouks)

## [0.3.3] - 2026-08-23

### Worker

#### 新增的功能

- 运行中的 Worker 支持单项暂停、恢复和取消；暂停保留意图、事实与漏洞，取消会在执行退出后事务性清理当前意图及其直接产物。
- 增加 `paused` 意图状态、执行栅栏和具名终止原因，防止暂停、取消或任务删除后出现迟到黑板写入。
- 增加可选任务并发上限；新建、恢复、漏洞深入和队列补位统一通过持久化 FIFO 准入路径。

#### 修改的功能

- Worker 单次运行墙钟默认时长由 600 秒调整为 1200 秒；超时任务复活后在下一次真实执行时重新计时。
- Worker、Planner 和主 Agent 的真实执行状态统一驱动任务状态徽标，修复 Worker 运行时仍显示“空闲”的问题。
- Worker 会话保留单项控制和当前会话 Token 汇总，模型名称移动到当前会话标题右侧展示。

#### 删除的功能

- 删除 Worker 多选、全选及批量暂停/继续界面，同时移除 Worker 批量控制 API 和 Mock 契约。
- 删除 Worker 列表行中的 Token 徽标与 Tooltip，底层完整 Token 账本和任务聚合接口继续保留。

### LLM

#### 新增的功能

- 任务支持有序 LLM 配置链；明确识别供应商额度不足时自动切换下一配置，并持久化当前配置、耗尽状态和错误摘要。
- 运行中和暂停任务支持编辑完整配置链、调整顺序和手动切换当前配置，从下一次 LLM 调用生效。
- 自动切换、手动切换和全链耗尽写入结构化系统活动，并通过任务活动流弹出可去重提醒。
- 增加任务角色模型解析接口，统一解析 Main Agent、Planner 和 Worker 下一次调用使用的配置与模型。
- 增加可选的全局 LLM Pool，支持配置调用顺序、指定模型失败兜底、健康状态、冷却恢复和手动重置。
- 增加始终开启的 LLM 用量账本，按任务、会话、模型和配置聚合输入、输出及缓存 Token。

#### 修改的功能

- 目标拆解、Planner、Worker 和主 Agent 共享任务级 LLM runtime（解析优先级见下）。
- 故障转移只响应明确的额度、余额或账单错误；普通限流、鉴权、网络、服务端和上下文错误不会错误切换。
- LLM 配置页改为配置卡片列表和右侧抽屉编辑，并提供 Pool 轮询顺序、优先级、排除项、健康状态和恢复操作。
- 配置链耗尽信息支持窄屏换行；当前模型由会话列表图标改为当前会话标题旁的文字标签和完整 Tooltip。
- 任务内各角色解析 LLM 的顺序调整为「Agent 绑定 → 任务配置链 → 全局」：显式绑定模型的角色始终跑在该模型上，未绑定角色才落到任务链，任务链为空时再落到全局。
- 出站代理留空即直连，不再回退 `HTTP_PROXY`/`HTTPS_PROXY` 环境变量（显式 `BLADEPRO_LLM_PROXY` 不受影响）；代理输入支持带账号密码的 `socks5://user:pass@host:port`。

#### 修复的问题

- 提交前（尚未产出任何输出）的瞬时流式失败在同一 provider 上安全退避重试，显著减少「只跑了一两个工具就中断、无总结、终态 `model_error`」的情况；额度耗尽、上下文过长和 4xx 确定性错误不重试，仍分别交由故障转移与压缩恢复处理。

#### 删除的功能

- 删除会话列表中的 LLM 图标式标识，避免与 Worker 状态图标混淆。

### UI

#### 新增的功能

- 任务支持全局分类的创建、重命名、删除和筛选；新建任务可直接选择分类。
- 增加全局任务模板 CRUD 和右侧管理抽屉；新建任务可加载预设描述与目标，也可将当前内容另存为模板。
- 新建任务支持关联多个来源任务和多个企业资产范围；企业范围通过单个多行文本框自动识别域名、URL、IP、CIDR、ICP 和企业关键词。
- 任务测试资产支持实时新增和删除，记录人工、企业、继承或 Agent 发现等来源；Worker 会话标题旁显示当前测试资产及来源摘要。
- 发现页按任务分组并提供组内独立分页，支持为漏洞填写描述并创建高优先级深入意图。
- 对话支持重命名、置顶、取消置顶和删除；任务列表支持当前页批量暂停与继续。
- 流量详情和工具执行详情改为右侧抽屉；HTTP 报文补齐 `Host` 并高亮请求行、状态码、Header、JSON 和标记语言正文。
- 任务列表操作列新增「详情」与「暂停/继续」按钮；会话发送键位可在系统设置中配置（`Enter` / `Cmd+Enter` 等），Web 搜索区新增代理输入框。
- 会话标题右侧徽标改为显示 LLM 配置名称，模型 ID 移至 hover Tooltip；任务可设置可选名称，任务列表新增名称列与搜索（空则回退到描述）。
- 技能页增加使用次数、最近使用时间和缺失依赖统计，便于定位未生效或未安装的技能。

#### 修改的功能

- 任务标题改为可聚焦详情链接；任务资产、企业资产、发现任务组和组内漏洞使用服务端真实分页、稳定排序与精确总数。
- 新增企业改用右侧抽屉，范围录入统一为多行文本并提供实时识别、校验和类型预览。
- 主 Agent 输入框支持自动增长、`Enter` 发送、`Shift+Enter` 换行，并避免中文输入法组合态误发送。
- Agent 预览、任务报告和相关详情统一使用共享 Markdown 渲染；删除确认、长错误和移动端抽屉宽度统一修复。
- 任务模板选择框以模板名称显示和搜索、以模板 ID 提交；恢复系统原始字体尺寸，应用版本统一显示为 `0.3.3`。
- 任务总计和当前会话 Token 只高亮输入、缓存读取和输出数值；发送按钮使用更简洁的上箭头图标。
- 任务总览的测试范围显示企业名称而非 ID。

#### 修复的问题

- 含点号的普通文本不再被误判为 ICP 备案号。
- 修复变量目录中与全局运行时变量（如 `{{.Now}}`）撞名，导致 Agent 编辑器变量列表渲染出重复 key 的问题。

#### 删除的功能

- 删除任务卡片独立“进入”按钮，统一点击任务标题进入详情。
- 删除仪表盘“新建任务”按钮、新增企业的 Logo URL 输入项，以及发现页顶部和任务分组中的漏洞数量 Badge。
- 撤销全局字体增大 10% 的样式，并删除会话列表中的 Worker 选择框、模型图标和行级 Token 统计。

### Agent

#### 新增的功能

- 新任务可直接关联多个已有任务，实时只读继承直接来源任务的目标、事实、漏洞、已完成意图、资产范围和黑板上下文。
- 黑板读取工具支持按需查询来源任务节点、事实、漏洞和执行轨迹；继承节点带来源标记且所有写工具拒绝修改。
- 企业范围工具支持域名、URL、IP、CIDR、ICP 和企业关键词；关键词仅作为 Agent 范围提示，不参与资产自动归属。
- 漏洞深入操作会在原任务创建带资产锚点和 `derived_from` 边的高优先级人工 Worker 意图。
- 总览新增「目标管理」卡片，支持人工查看、新增、修改和删除目标；新增或修改会通知 Planner 并复活任务，删除硬删目标节点（级联删边与锚点）但不复活。
- 主 Agent 默认获得 `steer_work` 工具，可对运行中的 Worker 实时注入纠偏指令而不打断、不丢失进展（仍校验意图归属本任务）。

#### 修改的功能

- 来源任务意图不进入新任务 frontier，新任务继续使用独立 exploration、执行队列、工作目录和对话历史。
- 删除运行中的意图不再销毁数据：改为停到 `stopped`、要求填写删除原因、把原因作为事实挂到该意图并写入 payload，规划者按 `cancelled` 触发感知（保留意图内容与原因）。
- 主 Agent 对话改为服务端活动流驱动，发送失败可恢复输入；打开会话时自动贴底并在详情懒加载后保持最后回复可见。
- 任务暂停会终止当前 Main Agent、Planner 和 Worker 调用，但不阻止暂停期间用户主动发起新的主 Agent 编排会话。
- 取消、关闭和流式中断统一保留真实终止原因、已生成内容、运行轮数、耗时、Token 与未返回工具调用。

#### 删除的功能

- 删除主 Agent 客户端乐观消息回显，避免暂停、失败或并发活动下出现重复消息和跨会话串流。

### 约束

#### 新增的功能

- 目标拆解阶段先抽取操作约束（allow/deny）再拆目标，主 Agent 运行时可补充；约束按最高优先级注入 Planner 与 Worker 系统提示，去偏后多样性与拓面探索显式服从约束。
- 总览新增「约束管理」卡片与增删改接口；约束注入范围可按 Planner / Worker 分别开关（默认都开，每轮读取、即时生效）。新表 `task_constraints` 使用 `CREATE TABLE IF NOT EXISTS`，旧库自动补建。

### 拦截

#### 新增的功能

- 命令拦截在正则/字符串规则之外新增模型兜底审批：一条规则都未命中时由模型做 `ALLOW`/`ASK`/`DENY` 语义判定，失败回退动作与审批超时动作可配置；拦截页拆分「拦截规则 / 模型配置」两个 Tab，模型判定结果标注 `[模型]` 前缀与理由。

#### 修复的问题

- 加固裁判输出解析，避免正确的 `DENY` 判定被误当作放行。

### 流量

#### 修改的功能

- 流量录制改为整条 exchange 落 SQLite（大正文溢出到按 hash 去重的 blob 桶），文本正文建 trigram 全文索引，支持任意子串与中文搜索；删除退化为单条 SQL 事务，从数小时降到毫秒级且期间不再停摆录制。新增大 body 流式下载与 `traffic_search` 全文参数；旧文件树数据免迁移，仍可读、可搜、可删。

### 任务与资产

#### 新增的功能

- 创建任务新增「资产覆盖度功能」开关（默认开）：关闭后不计算与展示覆盖度、态势图只显示资产、不自动累积 `task_scope`，相关工具从 Planner / 主 Agent 剔除；企业关联不受此开关影响。
- `insert_assets` 每条资产新增 `related` 标记（默认 `true`）：仅在开启覆盖度时生效，`false` 只入共享资产库、不计入本任务覆盖度（如顺带发现的旁站或无关资产）。
- 企业范围和任务测试资产统一支持域名、URL、IP、CIDR、ICP 与关键词文本识别；域名/IP 可创建或复用全局资产，CIDR/ICP/关键词保留为任务范围上下文。

### 构建

- `build.sh --release` 支持一次构建 Linux amd64/arm64、macOS amd64/arm64 和 Windows amd64，并生成带 `skills/`、配置示例和 README 的 zip 发布包。
- 使用 Go linker 去除调试信息并生成 zip 发布包；UPX 改为显式可选，避免其自解压 ELF 在部分 Linux 环境启动时发生段错误。
- Release Workflow 对 Linux amd64 二进制执行启动冒烟测试，并随发布包提供 `SHA256SUMS`。

### 贡献者

- [@neouks](https://github.com/neouks)

## [0.3.2] - 2026-08-20

### Added

- 新建任务支持关联多个已有任务，实时、只读继承直接来源任务的事实、漏洞、已完成意图、资产范围和黑板上下文；新任务仍使用独立的执行队列、工作目录和会话历史。
- 任务支持有序 LLM 配置链。明确识别到供应商额度不足时自动切换到下一配置，并持久化当前配置、耗尽状态和结构化审计活动。
- 运行中和暂停任务支持编辑 LLM 配置链、调整顺序及手动切换当前配置；自动切换、手动切换和全链耗尽会在任务详情页提示。
- 运行中的 Worker 支持暂停、恢复和取消。暂停保留黑板数据，取消会在 Worker 停止写入后事务性清理该意图及其直接产出的事实、漏洞和执行记录。
- 删除任务可选择同时清理关联资产、流量、漏洞和任务落地文件，并增加删除屏障、并发保护和可审计的删除统计。
- 增加可选的任务并发上限；达到上限的新任务按 FIFO 排队，并在运行槽位释放后自动启动。
- 增加任务资产分页、公司资产分页、任务分类统计及分页意图 Mock 契约。
- 增加 `build.sh` 单二进制构建脚本，支持静态前端导出、资源嵌入、跨平台目标和构建版本注入。

### Changed

- 任务级显式 LLM 配置链与现有全局 LLM Pool 并存；显式链继续采用严格的额度故障转移语义，无显式链时沿用 Agent 绑定和全局配置规则。
- 主 Agent 输入框支持自动增长的多行输入，`Enter` 发送、`Shift+Enter` 换行，并避免中文输入法组合态误发送。
- Planner、Worker 和主 Agent 共享任务级 LLM runtime；任务链使用候选模型中最小上下文窗口作为安全压缩阈值。
- 任务详情页按真实 LLM 调用状态展示运行、空闲和暂停状态；来源任务的事实、漏洞、意图、资产引用和图谱节点统一标记来源并保持只读。
- Agent 预览、任务报告和相关详情视图统一使用共享 Markdown 渲染组件。
- LLM 模型配置采用卡片和抽屉交互，模型列表在抽屉内支持独立滚动。
- 任务暂停不再拦截主 Agent 对话：主 Agent 编排会话独立于任务暂停，暂停中仍可继续发送新消息（暂停只终止当前进行中的那一轮）。
- Worker 单次 run 的墙钟默认时长由 600 秒调整为 1200 秒。

### Fixed

- 移除主 Agent 控制台的乐观回显，改为纯服务端数据渲染，修复暂停或发送失败等场景下消息错乱、串入其他会话内容的问题。
- 打开主 Agent 会话默认滚动到底并完整显示最后一条回复：最后一条回复的完整内容懒加载展开后自动贴底，不再被顶出屏幕。
- 修复暂停任务后主 Agent 会话仍继续运行，以及编排 Agent 暂停任务时未同步停止主 Agent 的问题。
- 修复任务完成、Planner、Worker 或主 Agent 实际运行时，任务状态徽标与操作按钮状态不同步的问题。
- 修复 Worker 取消、任务删除和并发写入之间可能产生迟到黑板写入或残留文件的问题。
- 修复 Markdown 预览失效、删除确认长文本溢出、移动端宽度和部分任务详情按钮未对齐的问题。
- 为所有 Agent 取消路径增加具名终止原因，活动详情可显示取消方、终态、运行轮数、耗时、Token 使用量和未返回的工具调用。
- 修复后端关闭时父 context 可能抢先覆盖具名 `shutdown` 原因的竞态，以及中文活动摘要按字节截断导致乱码的问题。
- 修复带部分流式输出的取消事件丢失真实终止原因的问题，同时保留取消前已生成的内容。

### 贡献者

- [@Autumn-27](https://github.com/Autumn-27)
- [@neouks](https://github.com/neouks)

[Unreleased]: https://github.com/lin9527ya/BLADEPRO/compare/v0.5.1...HEAD
[0.5.1]: https://github.com/lin9527ya/BLADEPRO/releases/tag/v0.5.1
[0.5.0]: https://github.com/lin9527ya/BLADEPRO/releases/tag/v0.5.0
[0.4.2]: https://github.com/lin9527ya/BLADEPRO/releases/tag/v0.4.2
[0.4.0]: https://github.com/lin9527ya/BLADEPRO/releases/tag/v0.4.0
