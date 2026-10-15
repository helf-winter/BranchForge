# Self-Evolving Agent Harness

Agent Harness 是 Claude Code 内部的一层长期工程运行时：Skills 约束任务规划和执行方式，Hooks 记录生命周期事实并在确定性边界执行有限门禁，MCP 工具提供可验证的 Task Tree 与 Runtime State 操作。它不是独立管理 Claude 的后台系统。

当前版本实现 Runtime Foundation、Branch Confirmation、Node Execution & Evaluation、Artifact Graph & Plan Drift、Runtime Action & User Change、Failure Case Maturity、Experience & Skill Evolution、Task Node Replacement & Effect Disposal、Project Identity & Clone、Plugin Composition Contract、Task Tree Refinement Loop、Trace Execution Context、Task Tree Collection Lifecycle、Parent–Child Task Communication、Tree-centered Runtime View、Task Affiliation Confirmation、Jev Evidence Semantic Evaluation、Skeleton Gate Evaluation、Branch Phase Orchestration、Final Report & Task Tree Completion，以及 Verification Freshness & Invalidation 二十一个纵向切片：

- 全局 SQLite Runtime Database（Node 内置 `node:sqlite`，无原生数据库依赖）；
- token 校验的 `.agent-harness-project.json` 最小身份 marker、路径别名、移动/重命名识别和可追溯 Project Clone；
- Task Tree 根任务、不可变修订、Leaf Task Contract、关系与 Artifact 校验；
- 一个 Project 可维护多棵 Task Tree；创建或选择时仅激活一套 Workflow，归档可恢复且不删除 revision、Trace 或 Artifact 证据；
- 普通 coding 请求先持久化确定性候选快照、Agent 建议和确认提示；只有绑定后续用户回答 Trace 后才会新建或选择 Task Tree；
- 允许保存不完整但结构合法的规划草案；按 tree/branch 范围执行确定性 Plan Readiness、问题优先级和语义警告；
- 局部 refinement 可直接应用，跨分支 refinement 必须先持久化影响预览；成功应用原子绑定用户消息 Trace、Draft Change Set、Decision Record、planning Trace、新 revision 与 Skeleton 投影；
- 规划、版本绑定的分支确认、Skeleton、实现和验证工作流状态；
- 分支确认记录不可变；节点确认状态与执行状态分离，支持 `draft`、`pending_user_confirmation`、`confirmed`、`partial_confirmed`；
- 修改一个已确认分支时，仅该分支重新确认，未变化兄弟分支保留确认；跨分支依赖未确认时节点处于 `blocked_by_unconfirmed_dependency`；
- Claude 生命周期 Hook 的幂等、脱敏 Trace 与 Artifact 投影；
- 可选 Jev 请求路由只给出 `conversation`、`direct_coding`、`structured_coding` 三类建议；失败、低置信度或未配置时回退给 Claude 原生判断，不会让 Claude Code 不可用；
- `task-tree-planning` 只引导复杂、多阶段、跨模块或用户显式要求规划的请求；Claude 原生讨论、`AskUserQuestion` 和 Plan Mode 保持可用。结构化执行只在“当前 revision 未经原生 Plan 批准”或“批准后尚未启动调度节点 Attempt”两个写入边界返回可恢复门禁；
- Trace Event 保存隐私受限的 Execution Context 快照；同一 Project/run 内继承启动模型与方式，模型切换后更新后续事件，且不保存 transcript、任意环境变量或底层模型完整请求响应；
- 修订绑定的 Artifact Graph：Task Link、Artifact Relation、Contract、规划基线和 Trace 来源；
- 确定性 Hook 自动识别未规划 Artifact，语义 Drift 可由 Agent 显式记录；阻断 Drift 会暂停节点等待用户确认；
- Snapshot、Task Tree、Artifact Graph、Artifact Detail、Plan Drift 与分页 Trace 查询，Trace 可按 `runId` 筛选并返回事件级 Execution Context，全部严格按 Project 隔离；
- 基于当前节点修订的 Execution Attempt、Trace 证据关联、不可变 Evaluation 与确定性生命周期策略；
- 未解决的阻断 Drift 会把成功提议记录为 `uncertain`，Evaluation 不能绕过确认门禁；
- 可选的 TypeSafe Jev Provider 以固定模型对脱敏 Evidence Snapshot 做语义判断；低置信度、旧快照或 Provider 失败只能让成功提议降级为 `uncertain`；
- Runtime Action 将自然语言意图转换为可校验的结构化状态变更；阻断 Drift Resolution 和 Scope Change 必须绑定明确的确认提示与用户回答 Trace；
- User Change Request 区分 `minor_change`、`priority_change` 和 `scope_change`，保留来源、影响、状态及关联动作；
- Scope Change 确认后产生新的 Task Tree 草稿修订并回到精炼阶段，不会直接授权代码执行；
- 应用后的失败 Evaluation 自动沉淀为 L0 Failure Case；相同结构化签名复用案例，但每次失败 occurrence 独立保留；
- 结构化复现以不可变 revision 演进，并由独立 Trace 证据确定性推进 L1 manual、L2 assisted、L3 automated 与 L4 regression；
- 同一 Task Node revision 在两次及以上应用失败后成功时自动产生 Experience；Skill Candidate 指令以不可变 revision 冻结；
- Replay、Variation、Holdout 与 Negative Applicability 测试先经过独立质量门禁，再分别记录 no-Skill baseline 与 Skill-enabled 重复运行；
- Validation Report 由代码聚合覆盖率、基线区分度、稳定性、负面适用性与副作用风险，全部硬门禁通过后自动晋升 Skill；
- Task Node Effect 绑定精确 revision，并按 reversible、version-reversible、compensatable、irreversible 分类；
- Task Node Replacement 通过不可变候选、契约差异、依赖影响闭包、逆序挂起、证据化 Effect 处置、原子激活和失败恢复推进；
- 目录复制会创建独立 Project，重写 Task Tree、Artifact 与 Contract 引用，保留 Clone provenance，但不会把源 Trace、Attempt 或 Evaluation 冒充为目标执行事实；
- Clone 后运行时暂停在重新验证阶段；源项目和目标项目使用不同 marker 与 `project_id`，可独立继续演进；
- Runtime Plugin 使用稳定 ID 和不可变 revision，通过精确 provides/requires contract、固定点依赖协调与 composition state 实现空间组合；
- Plugin registration 和 Effect 由 revision 生命周期拥有；替换/卸载只接受证据化 disposition，并支持影响闭包、冲突重试、失败恢复和 provider 恢复后的依赖重激活；
- Skeleton Gate 按当前 revision 逐分支核对成功 Attempt、Hook Trace、实际 Artifact、Contract 验证引用、验证命令和 blocking Drift；每次结果不可变保存，只有 `passed` 才自动进入分支实现，不接受模型自行声明“完成”；
- Workflow 持久化当前活动分支及每个分支的 pending/active/implemented/verified 状态；实现、分支验证、下一分支和根验证只能由当前 revision 的确定性 Phase Gate 推进；
- `final_report` 阶段通过确定性完成门禁聚合 Task、Branch、Attempt、Drift、Confirmation、Artifact、Evaluation 与 Trace 事实；门禁通过后在同一事务中生成不可变 Final Report、完成 Task Tree 并停用 Workflow；
- Hook 发现验证后的真实修改时，会沿当前 revision 的 Artifact Relation、Task Link、分支和父级验证节点生成不可变 Verification Invalidation；受影响的成功节点进入 `needs_revalidation`，Workflow 回退到最早必要阶段，旧 Evaluation 与 Gate 只保留为历史事实；
- 父节点按当前 Task Tree revision 获得一跳 Child Task Reports；报告派生自 Attempt、Evaluation、Evidence、Artifact、Trace 与 Drift 事实，不维护第二份可漂移状态；
- 可执行的非叶子 verification 节点只有在当前直接子节点全部成功后才能创建 Attempt，且父节点仍必须完成自己的独立 Evaluation；
- Tree-centered View 以当前 Task Tree 为骨架提供 Snapshot、Summary、Detail 三档查询；默认只突出需关注关系，只有显式请求才返回可过滤的全局 Relation Overlay；
- Bash CLI、Claude 插件 Skills 和 77 个 MCP Runtime Tools。

## 环境要求

- Bash / WSL 优先；Windows PowerShell 也可用于开发。
- Node.js `22.13.0` 或更高版本。
- Claude Code `2.1.251` 或更高版本（Execution Context 的模型切换记录依赖 `PostModelSwitch` Hook）。模型登录和 API 配置仍由 Claude Code 自己负责，Harness 不保存模型密钥。

## 安装与验证

在 Bash 中进入仓库：

```bash
cd '/mnt/d/code/创业/Agent-Harness'
npm ci
npm run check
```

`npm run check` 会同时执行类型检查、全量测试、插件测试以及当前 Claude Code 提供的官方 `claude plugin validate`；因此应在实际运行 Harness 的 WSL/Bash Node 环境中执行，且该环境必须能找到满足最低版本要求的 `claude` 命令。

让 `harness` 命令在当前 Node 环境全局可用：

```bash
npm link
harness doctor
```

`npm link` 只链接当前项目，不复制项目目录。若切换了 WSL 用户或 Node/NVM 版本，需要在对应环境重新执行一次。

`harness doctor` 还会报告请求路由的 `enabled`、`readiness`、模型和 API Key 是否已配置，但绝不会输出 Key 本身。`disabled` 表示保留确定性显式意图和 Claude 原生判断；`misconfigured` 表示已要求启用 Jev、但当前 Bash/WSL 进程没有读到 `TYPESAFE_API_KEY`。

## CLI 快速体验

在任意待开发项目目录中运行：

```bash
cd /path/to/your-project
harness project inspect
harness taskroot '实现健康检查接口'
harness tree candidates health
harness tree select TREE_ID
harness tree archive TREE_ID
harness tree candidates --include-archived
harness tree restore TREE_ID
harness tree snapshot
```

`project inspect` 不会创建 marker。第一次 `taskroot` 或第一次被观察到的实质变更才会创建 `.agent-harness-project.json` 和全局 Project 记录。

默认数据目录：

- Linux/WSL：`$XDG_DATA_HOME/agent-harness`，未设置时为 `$HOME/.local/share/agent-harness`；
- Windows：`%LOCALAPPDATA%/AgentHarness`；
- 测试或自定义：设置 `AGENT_HARNESS_DATA_HOME`。

节点执行由已确认的 Task Tree 驱动。Agent/插件通常通过 MCP 调用；对应的 CLI 诊断入口为：

```bash
harness node attempt-start NODE_ID TREE_REVISION_ID
harness node verify ATTEMPT_ID
harness node evidence ATTEMPT_ID REQUIRED_EVIDENCE_KEY TRACE_EVENT_ID
harness node evaluate ATTEMPT_ID succeeded
```

`evaluate ... succeeded` 只是提出成功结论。Runtime 会核对当前修订、所需证据、依赖节点与子节点状态；条件不完整时会把 Evaluation 记录为 `uncertain`，不会把节点标成成功。

### Task Tree Collection Lifecycle

Task Tree 属于 Project，而不是聊天 Session。一个 Project 可以保留多棵相互独立的 Task Tree，但任意时刻最多只有一棵树被 Runtime 选中并拥有 active Workflow：

- 新建根任务会原子停用原 Workflow 并选择新树；选择旧树不会创建 revision，也不会恢复历史 Attempt；
- 默认候选查询隐藏 archived 树；`--include-archived` 或 MCP 的 `includeArchived: true` 仅用于明确查看归档历史；
- 归档只写入状态、原状态和不可变 collection transition，不删除 Task Tree revision、Trace、Artifact 或 Evaluation；
- 恢复会回到归档前状态，但不会自动选择、执行或重新激活 Workflow；
- 当前树存在 `running` 或 `verifying` Attempt 时，切换、新建或归档会被拒绝，必须先完成或中止该 Attempt；
- CLI 的 `tree select/archive/restore` 与 MCP 的 `harness_select_task_tree`、`harness_archive_task_tree`、`harness_restore_task_tree` 使用同一事务化服务逻辑，并始终按当前目录绑定的 Project 隔离。

### Task Affiliation Confirmation

小型、自包含的 coding 请求默认直接执行，由 Hooks 记录 Trace 与 Artifact，不强制建立 Task Tree。复杂、多阶段、跨模块、存在未决设计问题或用户明确要求结构化规划的请求，才由 `task-tree-planning` Skill 使用可恢复的确认链路：

当确定性路由或 Jev 把当前请求归为 `structured_coding` 时，Hook 会在该次请求的动态上下文中明确要求先加载 `agent-harness:task-tree-planning`，并在普通需求细节提问前调用 `harness_propose_task_affiliation`。这只激活 Harness 的规划入口，不替代 Claude 原生讨论、`AskUserQuestion` 或 Plan Mode。若 Agent 忽略入口并准备结束本轮，`Stop` Hook 只会唤醒一次并给出同一恢复动作；已有待确认归属时不会打断用户问题，同一 Session 也不会重复唤醒形成循环。

1. `harness_propose_task_affiliation` 在当前 Project 内执行确定性候选检索，保存候选快照、Agent 的 `new_tree` / `merge` 建议、Runtime Action 和确认提示，但不创建或选择树；
2. Agent 向用户展示候选、匹配依据与建议，用户选择 `direct_execution`、`new_tree`、`merge` 或 `pause`；用户也可以在自由文本回答中随时要求“不建树，直接执行”；
3. 等待确认期间，即使尚无 active Workflow，Hook 仍会把回答记录为 `UserPromptSubmit` Trace；普通解释性聊天仍不会创建 Project 或 Runtime 状态；
4. `harness_resolve_task_affiliation` 只接受同一 Project 中、提示之后的回答 Trace；`merge` 还会重新校验目标树未归档且属于当前 Project；
5. `direct_execution` 关闭待定归属且不创建、选择或修改 Task Tree，Agent 随即按用户最新指令直接工作；`new_tree` 在确认后才创建并选择根任务，`merge` 只选择现有树，`pause` 停止当前请求；同一决定重复提交相同选择保持幂等；
6. `harness_get_task_affiliations` 和 Runtime Snapshot 可在重启后恢复待确认或已解决结果。每个 Project 同时最多一个待确认归属。

没有活动 Task Tree Workflow 时，Harness 不把“没有任务树”解释为禁止修改：Agent 可以直接执行，Hooks 只记录事实。原生 Plan Mode、提问、读取和 Runtime 工具在结构化模式中也始终可用。只有 `structured_coding` 的项目 mutation 才检查两个精确边界：当前 revision 必须已通过一次原生 Plan 批准，并且执行阶段必须已有由调度器选中并启动的活跃 Attempt。门禁会返回 `harness_prepare_task_tree_approval` 或 `harness_get_next_executable_node` → `harness_start_node_attempt` 的单一恢复路径；用户明确选择 `direct_execution` 后立即绕过结构化门禁。高风险确认与是否建立 Task Tree 相互独立。

显式 `/taskroot [任务名称]` 是用户直接要求新建根任务的命令，不经过普通 coding 请求的归属选择。

### Structured Coding 与原生 Plan

结构化工作流复用 Claude Code 原生规划能力，而不是另建一套对话或计划编辑器：

1. Claude 通过原生对话和 `AskUserQuestion` 精炼需求，并通过 typed Runtime Tools 创建完整 Task Tree draft、提交用户可见决定对应的局部 patch；
2. `harness_validate_task_tree` 对精确 revision 做确定性就绪检查；`harness_prepare_task_tree_approval` 返回可读、确定、不可篡改的 canonical block 和一次性 approval reference；
3. Claude 将 canonical block 原样放进原生 Plan。成功的 `ExitPlanMode` 是这一 revision 唯一一次用户批准，不再弹出第二个 Harness 确认，也不从 Markdown 解析或重建 JSON manifest；
4. 批准后调用 `harness_get_next_executable_node`。调度器先按深度与文档顺序执行全部 Skeleton，再在一个 active branch 内深度执行 implementation 和 verification，最后执行 root verification；
5. Claude 用 `harness_start_node_attempt` 启动返回节点后，继续使用原生文件、命令和测试工具。Hooks 将 Trace 与 Artifact 事实绑定到该 Attempt；证据和 Evaluation 完成后再次查询下一节点。

Task Tree revision 是规划事实源；原生 Plan 是展示与批准界面；Skill 是行为规范入口；Hook 是事实记录和有限边界门禁；MCP Tool Provider 提供结构化状态操作。四者不是相互替代的系统。

### Parent–Child Task Communication

Task Tree 中的父子通信不是额外维护一份可变汇报，而是 Runtime 从当前 revision 的执行事实中投影：

- `harness_get_task_node_detail` 返回分页的一跳 `childReports`、`childNextCursor` 与聚合 `childSummary`；默认最多 50 条，最大 200 条；
- 每个 Child Task Report 包含节点状态、确认状态、执行阶段、最新 Attempt、当前 revision 的最新 Evaluation、证据覆盖、Artifact 数量、Trace 数量与未解决阻断 Drift 数量；
- `childSummary.readyForParentEvaluation` 只有在当前直接子节点全部为 `succeeded` 时才为真；历史 revision 的成功不能冒充当前执行结果；
- skeleton 阶段仍可先搭建上层框架；进入非叶子 verification 节点执行时，Runtime 会在创建 Attempt 前确定性校验所有当前直接子节点；
- 子节点成功只满足父节点的前置条件，不会自动把父节点标记成功。父节点必须产生自己的 Attempt、证据和 Evaluation；
- 所有查询和门禁都由当前 Project 解析 tree/node，不会通过 ID 读取其他项目的数据。

### Tree-centered Runtime View

`harness_get_tree_view` 让 Agent、CLI 和未来图形界面共享同一套渐进式查询语义：

- `snapshot` 返回当前 revision 的整棵树节点摘要，但关系只返回 cycle、缺失 Artifact、未确认依赖或未完成依赖等需关注项；
- `summary` 返回树摘要和选中节点的一跳入边、出边，以及 Artifact、Trace、Failure Case 和关系计数引用；
- `detail` 默认仍保持一跳范围；只有 `includeRelationOverlay: true` 才返回全局 Relation Overlay；
- Overlay 可按 relation kind、方向、分支、关系状态、风险、节点状态和 Artifact 过滤；
- 节点状态、execution phase、确认状态、Drift、Artifact 数量、最新适用 Evaluation 和 Evidence coverage 均从当前 revision 的事实派生，不维护重复视图状态；
- Relation ID、Task Node ID、Artifact ID、Attempt ID、Evaluation ID 和 Failure Case ID 保持稳定，可继续进入现有 Detail 查询；
- 历史 `data_exchange` 与 `shares_contract` 输入仍可读取；新 revision 统一保存为 `exchanges_data_with` 与 `shares_artifact_with`。

### Project Identity 与 Clone

Project Runtime Records 统一存放在公共数据库中，项目目录只保存 `.agent-harness-project.json` 最小身份 marker。路径用于隔离与展示，稳定 `project_id` 用于识别目录移动、重命名和复制：

- 原路径已经不存在时，新的 marker 所在路径被判定为 `moved_or_renamed`，持久化操作会更新主路径并保留路径历史；
- 原路径仍存在时，新的路径被判定为 `copy_detected`；第一次需要 Runtime 状态的操作会事务化创建独立 Project、改写副本 marker，并克隆允许继承的工程记忆；
- 无效 marker、未知 Project 或 token 不匹配返回 `identity_conflict`，不会静默共享状态；
- `harness project inspect` 和 `harness_get_project_identity` 只检查，不创建或改写身份；
- `harness project clones [incoming|outgoing|all]`、`harness project clone-detail CLONE_ID`、`harness_get_project_clones` 和 `harness_get_project_clone_detail` 用于审计来源、实体 ID 映射与继承证据。

Clone 继承 Task Tree、不可变修订、Artifact Graph、Contract 和确认投影；目标 Artifact 回到 planned，运行中节点暂停，成功节点重新验证。源 Trace、Attempt 与 Evaluation 不会复制到目标项目，历史 Evaluation 只以明确的 `inherited_from_clone` provenance 保存。

### Plugin Composition Contract

Plugin Composition 是 Harness 数据目录级的运行时能力注册表，不随单个 Project Clone。它描述 Skill、Workflow、Hook、Binding 和 Runtime extension 如何组合，但不替代 Claude Code 的插件安装器，也不会动态导入或执行不可信代码。

- `harness_register_plugin_revision`：注册稳定 Plugin ID 下的首个不可变 revision；
- `harness_get_plugins`、`harness_get_plugin_detail`：查看 current revision、composition state、缺失契约、registration、Effect、依赖边和状态转换；
- `harness_reconcile_plugins`：按精确 `contractId@version` 反复协调到固定点；provider 缺失时 consumer 进入 `pending_dependency`，恢复后自动重激活；
- `harness_preview_plugin_replacement`：保存 candidate，展示 contract diff、反向依赖影响闭包、逆序挂起顺序和 Effect 风险，不改变 current revision；
- `harness_execute_plugin_replacement`：校验每个旧 registration/Effect 的 disposition 与证据，成功后原子切换 revision；冲突时保留旧 revision 供重试；
- `harness_recover_plugin_replacement`、`harness_get_plugin_replacement_detail`：恢复可逆的失败激活并审计全部处置尝试；
- `harness_dispose_plugin`、`harness_reactivate_plugin`：证据化卸载/重载，并向依赖者传播 provider 消失与恢复。

manifest 中的 disposer、inverse 和 compensation 字符串只是 Binding 声明。Harness 永远不会把它们当成 shell、JavaScript、MCP 或回调直接执行。`plugin-composition` Skill 指导 Agent 先由目标 Binding 真正完成动作、取得证据，再提交 Runtime 状态。

### Task Tree Refinement Loop

`task-tree-planning` Skill 把需求讨论组织成可恢复的规划循环，而不是要求用户一次确认粗略初稿：

1. `harness_save_draft_revision` 保存结构合法的中间草案；未决问题和不完整 Leaf Contract 可以继续存在。
2. `harness_scan_plan_readiness` 按整棵树或指定分支返回 blocking issues、warnings 和代码确定的 `recommendedNextIssue`。
3. Agent 围绕一个问题与用户讨论；用户可以随时改为其他分支。真正结构变化前，用 `harness_get_trace_events` 找到对应的 `UserPromptSubmit` 事实。
4. `harness_preview_draft_change_set` 计算节点、分支、Artifact、Relation 与 Contract 影响；跨分支变化必须持有匹配当前 base revision 和文档 hash 的 active preview。
5. `harness_apply_draft_change_set` 提交可展示的选项、建议和用户决定。Runtime 在一个事务中写入 Change Set、Decision Record、planning Trace、新 revision 与 Skeleton Acceptance Criteria；无结构变化不会产生 revision。
6. `harness_get_task_refinement_history` 和 `harness_get_planning_decision_detail` 分页恢复历史决定，无需重放完整聊天记录。

只有目标范围的 Plan Readiness 通过后才能进入分支确认；兄弟分支自身的问题不会阻塞一个已经就绪的分支。Decision Record 不保存隐藏思维链或底层模型完整请求/响应。

### Artifact Graph 与 Plan Drift

Artifact Graph 保存当前工程状态，Trace 保存追加式事实历史。文件或验证命令 Hook 会同步更新 Artifact 的状态与来源 Trace；规划修订则保存节点与 Artifact 的链接、Artifact 间关系和契约。两者不会重复承担事实历史与当前状态的职责。

Agent 可按需使用以下 Runtime Tools：

- `harness_get_artifact_graph`：分页查看当前 Artifact、节点链接、关系和契约；
- `harness_get_artifact_detail`：查看单个 Artifact 的当前状态、来源 Trace、关联任务和 Drift；
- `harness_get_plan_drift_summary`：按 Task Tree、Task Node、严重级别和处理状态筛选 Drift；
- `harness_record_plan_drift`：记录不能由 Hook 确定判断的语义偏移。

`warning` Drift 作为事实记录继续执行；`blocking` Drift 会把相关节点和活动 Attempt 置为 `blocked`，直到后续用户确认流程解决该偏移。所有查询都只返回当前目录所绑定 Project 的数据。

### Runtime Action 与 User Change

自然语言输入不会直接改写 Runtime State。Agent 先使用查询工具获取当前快照、Drift、Task Tree 与 Artifact 事实，再把意图提交为结构化 Runtime Action：

1. `harness_propose_plan_drift_resolution` 为一个待处理的阻断 Drift 提议 `accepted`、`rejected` 或 `branch_cancelled`；
2. `harness_propose_user_change` 记录 `minor_change`、`priority_change` 或 `scope_change`；
3. `harness_get_waiting_items` 返回当前 Project 中等待回答的明确提示；
4. 用户回答由 Hook 记录为 `UserPromptSubmit` Trace；
5. `harness_resolve_runtime_confirmation` 使用明确的 `confirmationId` 与回答 Trace 提交 `yes`、`no` 或 `pause`；
6. `harness_get_user_change_requests` 和 `harness_get_runtime_action_detail` 用于回看持久化结果。

`minor_change` 只记录事实，`priority_change` 只改变当前选中的后续节点；二者不修改 Task Tree revision。`scope_change` 和阻断 Drift Resolution 属于高风险动作，必须确认。确认 Scope Change 只会创建新草稿并回到 Task Tree refinement，仍需重新扫描就绪条件并确认受影响分支后才能执行代码。

### Failure Case 成熟度

当 Lifecycle Transition Policy 真正应用一个 `failed` Evaluation 时，Runtime 自动建立或复用 L0 Failure Case，并保存来源 Task Node、Attempt、Evaluation、Artifact 与证据。Failure Case 不会因为后续修复成功而被删除。

Agent 通过以下工具推进复现成熟度：

- `harness_get_failure_cases`：按 Tree、Node、L0-L4 和可用性状态筛选案例；
- `harness_get_failure_case_detail`：查看来源、所有 occurrence、复现 revision、验证结果和相关 Artifact；
- `harness_add_failure_reproduction`：追加 manual、assisted 或 automated 结构化复现契约；
- `harness_validate_failure_reproduction`：提交独立运行产生的 Trace 证据，并由代码计算允许的最高成熟度。

复现工具只保存声明的 `entryCommand`，不会自行执行任意 shell。生成复现步骤与验证结果必须分离：L3 需要稳定 pre-fix RED、可区分 Oracle、重复稳定和充分隔离；L4 还必须证明 post-fix GREEN。隔离可以使用 fixture、worktree、临时目录或项目原生测试环境，容器不是强制条件。

### Experience 与 Skill Evolution

当同一个 Task Node revision 的应用后 Evaluation 历史形成 `failed → failed → succeeded` 时，Runtime 自动保存一个 Experience，并保留来源 Project、Tree、Node、Attempt、Evaluation 和 Artifact 引用。一次成功最多生成一个 Experience；失败事实、成功事实和候选指令都不会被后续晋升改写。

Agent 通过以下工具完成可审计的进化闭环：

- `harness_get_skill_evolution_candidates`：按当前 Project、Tree 或 Node 查找合格 Experience；
- `harness_freeze_skill_candidate`：从 Experience 冻结不可变候选指令；
- `harness_propose_skill_test_case`：分别提出 real-failure replay、variation、holdout 和 negative-applicability 测试；
- `harness_validate_skill_test_quality`：用候选测试产生后的同 Project Trace 验证结构、隔离、复现、Oracle、区分度、稳定性和分片正确性；
- `harness_record_skill_validation_run`：为每个已接受测试保存 no-Skill baseline 与 Skill-enabled 重复运行、资源用量和副作用；
- `harness_generate_skill_validation_report`：聚合硬门禁并在全部通过时自动晋升；
- `harness_get_skill_candidate_detail`：查看来源 Experience、测试、质量结果、运行和报告。

每种必需分片的 baseline 与 Skill-enabled 模式都至少执行三次。Replay baseline 必须稳定失败而 Skill-enabled 稳定通过；Holdout 不接收候选指令快照并声明防泄漏策略；Negative Applicability 必须证明 Skill 不会在不适用场景中造成错误行为；任何 high 或 irreversible 副作用都会阻止晋升。

### Task Node Replacement 与 Effect Disposal

Task Node 的执行状态与组合状态相互独立。实现 revision 可以被替换，但历史 revision、Effect、Trace、确认和处置结果都保持不可变。Agent 通过以下 Runtime Tools 完成闭环：

- `harness_register_task_node_effect`：把一次工具行为产生的 Effect 绑定到当前 Task Node revision；
- `harness_get_task_node_effects`：按 Tree、Node、类型和处置状态分页查询 Effect；
- `harness_preview_task_node_replacement`：保存候选 revision，计算 Contract Diff、反向依赖影响闭包和 Effect 风险，并创建明确确认提示；
- `harness_confirm_task_node_replacement`：用提示之后的用户回答 Trace 提交 `yes`、`no` 或 `pause`；
- `harness_execute_task_node_replacement`：校验证据化处置结果，成功时原子激活新的 Tree revision 并重评估受影响节点；
- `harness_recover_task_node_replacement`：在激活失败且不存在不可恢复处置时恢复旧 revision 的组合状态；
- `harness_get_task_node_replacements` 与 `harness_get_task_node_replacement_detail`：查询完整替换历史、候选、确认、Effect、处置和状态转换。

Runtime 只记录 operation、inverse 和 compensation 的声明与执行证据，绝不把这些字符串当作 shell 命令执行。Version-reversible Effect 必须同时满足目标归属、基线一致且无共享活跃 owner；Compensation 是新的工程事实，不等同于回滚；Irreversible Effect 不允许自动处置。

### 分支确认链路

Agent 通过 Runtime Tools 执行下列链路：

1. 调用 `harness_scan_plan_readiness`，传入 `treeId`；只确认某一分支时同时传入 `scopeRootNodeId`。
2. 使用返回的 `resultId` 调用 `harness_create_confirmation_prompt`，将其作为 `readinessResultId`，并原样传入同一个 `scopeRootNodeId`。
3. 用户回答由 Hook 记录成 `UserPromptSubmit` Trace Event。
4. 调用 `harness_confirm_scope`，传入该 Trace Event ID。
5. 通过 `harness_get_task_tree_summary` 查看每个节点的 `confirmationState` 和聚合 `confirmationCounts`。

Readiness 结果和确认提示都绑定创建时的 Task Tree revision。树结构发生变化后，旧提示会返回 `revision_conflict`，不会被套用到新版本。部分分支确认不会自动确认兄弟分支，也不会让未确认节点进入执行阶段。

### Skeleton Gate Evaluation

全部确认后，Workflow 进入 `skeleton_pass`。Agent 先执行当前 revision 的 Skeleton Task Nodes，并像普通节点一样绑定 required evidence、完成 Evaluation；随后调用 `harness_evaluate_skeleton_gate`，不得自行宣布骨架完成或手工跳转 Workflow：

- 对 `planningVersion: 1` 的 Task Tree，Runtime 逐个已确认顶层分支读取 Skeleton Acceptance Criteria；
- `expectedArtifacts` 必须具有由该分支 Skeleton 节点产生的创建、修改或验证 Hook 事实；
- `requiredContracts` 必须存在于当前 Artifact Graph revision，且其 carrier 或 `validationRefs` 已被 Skeleton 证据验证；
- `verificationCommands` 必须与成功 Skeleton Attempt 绑定的已验证命令 Trace 精确匹配；
- 每个当前 Skeleton 节点必须在当前 Task Node revision 上成功，且整棵树不得存在待处理 blocking Drift；
- 每次 `passed`、`failed` 或 `uncertain` 结果都会不可变保存；失败和无法判断时保持 `skeleton_pass`，补齐事实后可重试；只有通过时才原子进入 `branch_implementation`；
- `harness_get_skeleton_gate_results` 与 Runtime Snapshot 可在重启后恢复结果、阻塞项数量和证据引用。

骨架节点都已成功但门禁仍缺证据时，`harness_get_next_executable_node` 会返回带 `recovery` 的局部补验节点：缺失的精确命令、契约验证引用和产物。按正常接口新开 Attempt，补齐并绑定证据，再重新评估骨架门；不修改旧成功 Attempt、不重建树、不重复审批。规划本身缺契约定义时仍需精炼，不能用补验绕过规划检查。

没有 `planningVersion: 1` 的旧 Task Tree 采用明确标记的兼容策略，只要求当前 Skeleton 节点均有成功 Attempt；新规划不得依赖该兼容路径。

### Branch Phase Orchestration

Skeleton Gate 通过时，Runtime 按 Task Tree 中的顶层分支顺序建立当前 revision 的分支进度，并设置 `activeBranchNodeId`。Agent 只能在该分支内启动 implementation / branch verification Attempt：

1. 完成活动分支的 implementation 节点后调用 `harness_evaluate_workflow_phase`；节点未成功或存在 scope 内 blocking Drift 时结果失败且阶段不变。
2. Gate 通过后进入 `branch_verification`；活动分支必须具有 verification 节点，这些节点仍需独立 Attempt、Evidence 和 Evaluation。
3. 分支验证 Gate 通过后，Runtime 将该分支标记为 `verified`，激活下一个 pending 分支并返回 `branch_implementation`；没有剩余分支时进入 `root_verification`。
4. `root_verification` 只允许执行 Task Tree 根节点；根节点必须声明 verification phase，所有直接子节点成功后仍需独立验证。通过后进入 `final_report`。

每次 Phase Gate 都保存不可变结果，可通过 `harness_get_workflow_phase_results` 或 Runtime Snapshot 恢复。迁移前已经处于执行阶段、但没有分支状态的旧 Workflow 保持兼容；所有经新 Skeleton Gate 推进的 Workflow 都强制活动分支隔离。

### Final Report & Task Tree Completion

进入 `final_report` 只表示根验证已经通过，不等于 Task Tree 已完成。Agent 必须调用 `harness_finalize_task_tree`，由 Runtime 对当前树与 Workflow revision 执行最终门禁：

- 当前 revision 的所有 Task Node 必须成功，所有 Branch State 必须为 `verified`；
- 不得存在 active Attempt、blocking Drift、待处理 Confirmation 或待应用 Change Request；
- 必须存在当前 revision 的 `root_verification` passed Gate，旧 revision 证据不得复用；
- 通过后，Final Report、Task Tree `completed` 状态与 Workflow 停用在同一事务中提交；任一步失败都不得形成部分完成状态；
- Final Report 的摘要和 evidence refs 由 Runtime 事实聚合产生，不接受 Agent 自由文本作为完成证据，且创建后不可更新或删除；
- 完成的 Task Tree 仍可被选择并通过 `harness_get_final_reports` 查询，但不会重新激活执行 Workflow；重复 finalize 使用相同 idempotency key 返回同一报告。

### Verification Freshness & Invalidation

验证事实只能证明其产生时的工程状态。`PostToolUse` 记录成功 mutation 后，Runtime 会检查被修改 Artifact 是否已经被成功节点或阶段 Gate 使用：

- 影响范围从当前 Artifact 出发，沿当前 revision 的 Artifact Relation 找到共享 Contract 和其他关联资产，再通过 Task–Artifact Link 定位直接节点；
- 实现事实失效时，同一分支的下游 verification 节点和根 verification 节点同时进入 `needs_revalidation`；共享 Contract 会使所有消费分支进入重验；
- 已在执行的同阶段 implementation Attempt 可以继续；若较早阶段的变更使一个正在运行的 verification Attempt 失去依据，该 Attempt 会确定性变为 `aborted`；
- Workflow 按最早受影响阶段回退，并保留未受影响分支的成功事实。旧 Evaluation 与 Gate 不更新、不删除，只通过不可变 invalidation 标记为历史证据；
- `harness_get_verification_invalidations` 按当前 Project 查询失效原因、来源 Trace、Artifact、受影响节点以及被失效的 Evaluation / Gate；
- 重新完成受影响阶段后，Final Report 只引用未被失效的成功证据，同时保留全部 invalidation ID 与数量。

## Jev Evidence 语义评估

Jev 还可独立用于请求级三分类路由。该路由只接收当前用户 prompt 和是否存在活动树、树标题、当前节点标题、是否存在活动 Workflow 四项有界事实；不发送源码、工具输出、完整对话、环境变量、密钥或隐藏推理。启用方式：

```bash
export TYPESAFE_API_KEY='你的密钥'
export HARNESS_JEV_ROUTING_ENABLED=true
```

路由默认模型为 `jev-1.13.0`，默认超时 `2000ms`。可选参数为 `HARNESS_JEV_ROUTING_TIMEOUT_MS`、`HARNESS_JEV_ROUTING_ACCEPTED_CONFIDENCE`（默认 `0.80`）和 `HARNESS_JEV_ROUTING_ADVISORY_CONFIDENCE`（默认 `0.50`）。用户明确要求“先讨论并完善需求，确认规划后再实现”时，确定性路由直接进入 `structured_coding`；明确要求“不建立或修改任务树，直接执行”时，直接进入 `direct_coding`。这两类用户明示优先于 Jev。其他含义不明确的请求才交给 Jev 建议或 Claude 原生判断。高置信度建议映射为 `conversation`、`direct_coding` 或 `structured_coding`；中等置信度仅作建议；低置信度、401、429、529、超时、网络错误和畸形响应全部 fail-open，保留 Claude 原生判断能力。

项目已将 [TypeSafe Jev](https://docs.typesafe.ai/introduction) 接为可选的 Evidence 语义评估 Provider，用于补足确定性规则无法回答的问题：一条 Trace Evidence 的有限事实是否真正支持对应的 Required Evidence 与 Acceptance Criteria。

Jev 不替代测试、构建、Trace、Evaluation 或 Lifecycle Transition Policy，也不能直接把 Task Node 标记为 `succeeded`。预期链路为：

```text
Trace + Artifact + Execution Attempt
                 ↓
       脱敏 Evaluation Snapshot
                 ↓
      Jev Evaluation Provider
      ├─ Evidence 语义匹配度
      ├─ supported / unsupported / insufficient_context
      └─ 概率与置信度
                 ↓
 Deterministic Lifecycle Policy
                 ↓
       Task Node 状态迁移
```

2026-09-19 的内部可行性试验使用 6 条英文和 6 条中文合成任务记录：12/12 直接 verdict 符合预期，48/48 原子判断方向符合预期；两次批量请求共使用 8,070 个输入 token，成本约 `$0.00034`。该结果仅证明值得继续集成，不代表真实工程数据上的准确率或公开 benchmark。

当前接入边界：

- 默认关闭；只有 `HARNESS_JEV_ENABLED=true` 才发起外部请求，模型固定为 `jev-1.13.0`；
- 仅发送脱敏、最小化的 Evaluation Snapshot，不发送源码、密钥或完整命令输出；
- Provider 超时、失败或低置信度时降级为 `uncertain`，不得猜测成功；
- `harness_evaluate_attempt_semantics` 将每条 Required Evidence 作为独立 Choice 问题，并保存模型版本、概率、置信度、token 用量、耗时和 snapshot hash；
- `harness_get_semantic_evaluations` 可恢复不可变历史；证据变化后旧结果自动失效；
- `TYPESAFE_API_KEY` 只从运行环境读取，不进入仓库、Runtime Database 或 Trace。

在 Bash / WSL 中启用：

```bash
export TYPESAFE_API_KEY='你的密钥'
export HARNESS_JEV_ENABLED=true
```

可选阈值为 `HARNESS_JEV_MIN_PROBABILITY`（默认 `0.7`）、`HARNESS_JEV_MIN_CONFIDENCE`（默认 `0.5`）和 `HARNESS_JEV_TIMEOUT_MS`（默认 `10000`）。API Key 本身不会自动启用外部调用。Jev 不生成 Task Tree、不写代码，也不直接迁移状态；请求路由和 Evidence 评估均只提供有界判断，最终状态仍由用户选择与确定性 Lifecycle Policy 决定。

## 在 Claude Code 中加载

推荐执行一次用户级安装。安装完成后，无论当前位于哪个项目目录，都可以直接运行 `claude`：

```bash
cd '/mnt/d/code/创业/Agent-Harness'
npm run build
claude plugin marketplace add . --scope user
claude plugin install agent-harness@agent-harness-local --scope user
```

仓库代码更新后，已安装插件不会自动读取工作区文件；Claude Code 使用的是用户级缓存副本。构建后应显式刷新 marketplace 和插件：

```bash
cd '/mnt/d/code/创业/Agent-Harness'
npm run build
claude plugin marketplace update agent-harness-local
claude plugin update agent-harness@agent-harness-local --scope user
claude plugin list --json
```

确认列表中的 `version` 为仓库当前版本（本版为 `0.1.10`）后，再关闭并重新打开 Claude Code。`/clear` 只清理对话上下文，不能替代插件/MCP 进程重启。

重新启动 Claude Code，然后在任意项目目录运行：

```bash
claude
```

开发插件本身时，也可以不安装，临时加载当前工作区版本：

```bash
claude --plugin-dir '/mnt/d/code/创业/Agent-Harness/plugin'
```

可使用 `/agent-harness:taskroot 任务名称` 显式新建根任务。复杂 coding 请求会由 `task-tree-planning` Skill 引导：先判断直接执行、新建、归并或暂停；进入 Task Tree 后再精炼完整树、运行就绪扫描、请求确认，并按 Skeleton 后分支的顺序执行。小型、自包含修改默认直接执行，用户也可在执行前用自然语言要求“不建树，直接执行”。普通问答不会创建 Task Tree。插件不注入每轮状态或 Conversation Frame；Claude Binding 只在 `SessionStart` 注入一次最小提醒。`PreToolUse` 不会因为项目没有 Task Tree 而阻止工作；只有活动 Task Tree 尚未到达 confirmed executable stage 时才返回 `deny`，防止越阶段修改。

MCP 和 Hooks 使用 `${CLAUDE_PLUGIN_ROOT}/runtime` 内的自包含构建产物，不依赖启动目录中的相对脚本。用户级安装会把插件复制进 Claude Code 缓存；仓库更新并重新构建后，必须执行上述 `marketplace update` 与 `plugin update`，新会话才会读取更新内容。

### Trace Execution Context

`SessionStart` 记录当前模型和启动方式，`PostModelSwitch` 更新当前模型；同一 Project、同一 `runId` 的后续 Hook Event 从最近事实继承这些会话级字段。每条事件仍保存自己的 `cwd`、permission mode、effort、prompt ID 和 agent 信息。`harness_get_trace_events` 可用 `runId`、`treeId` 或 `nodeId` 缩小范围，并在每条结果的 `executionContext` 中返回当时快照。

Execution Context 只保存允许字段：平台、架构、Node 版本和 Claude Hook 明确提供的运行元信息。Transcript、scratchpad 路径、任意进程环境变量、API 配置、模型提示词与完整请求响应不会进入该字段。

## 开发命令

```bash
npm run typecheck
npm test
npm run build
npm run plugin:validate
npm run check
claude plugin validate ./plugin
```

完整人工验收见 [docs/acceptance.md](docs/acceptance.md)。当前切片尚不包含完整 AST/符号调用图、Codex Binding 和图形界面。

`0.1.4` 修复原生选项回答证据、纯容器分支的根验证、正常实现对骨架的错误回退、依赖失效后的 Attempt 释放，以及归档/暂停后的残留门禁。回归范围与人工复测步骤见 [工作流死锁回归](docs/harness-deadlock-regressions.md)。

`0.1.5` 修复完成 Final Report 后的 Stop 误报：最终报告、树完成、工作流停用与相关会话的 Profile 收尾在同一事务提交。已完成树保持可查询，无需归档来解除门禁；新请求仍按原生讨论与 Task Tree 规划流程路由。

`0.1.6` 修复骨架门缺证据后的执行死锁：在现有审批与 revision 内调度新补验 Attempt，复用未失效的同上下文证据，区分契约缺定义与缺验证。命令验证使用绑定 Trace 的不可变签名，不受跨分支投影覆盖或秘密脱敏影响；只读组合诊断不再误拦，输出文件、命令替换和危险选项仍受门禁约束。

`0.1.7` 修复跨任务树重用节点 ID 导致的错误覆盖与根验证阻塞：冲突 ID 在保存前按树规范化，所有结构引用同步映射；持久化再次校验实际归属。旧的未执行根节点冲突可显式恢复为身份读模型，不改批准的规划 revision、原始 JSON 或不可变验证事实。只读预览不迁移数据库，执行恢复必须绑定 revision 并先做一致性备份。详见 [节点身份恢复](docs/node-identity-recovery.md)。

`0.1.8` 修正空闲 Runtime 的原生执行引导：`availableActions` 明确只列任务树工作流动作，不是项目工具权限白名单。无活动工作流的已注册项目会收到精简 Hook 提示，说明小修改无需归属确认、完成后“继续”不应扩展历史 warning 为新任务；暂停提示只停止当前请求。显式结构化规划仍受原生审批和 Attempt 门禁约束。详见 [原生执行边界回归](docs/native-execution-guidance.md)。

`0.1.9` 支持对已完成任务树显式追加功能分支：同一 treeId、新 revision、新原生 Plan 审批；旧报告与执行事实不被覆盖。可证明未受影响的旧证据按审计记录复用；旧版无指纹或受影响节点先补验证，根验收每轮重新执行。普通“继续”、选树和小修改不会自动重开树。详见 [任务树增量迭代](docs/task-tree-incremental-iterations.md)。

`0.1.10` 修复同分支正常实现被误判为骨架破坏的问题：使用当前修订的 `implements` / `modifies` 产物关系识别已规划写入，兼容旧版精确路径输出。仅同会话、当前 revision 的运行中 Attempt 所绑定的文件工具写入可以保留本分支骨架证据；实现仍须取得新的验收证据。跨分支、外部修改、验证期间写入和契约变化仍按原规则重验，不推断任意源码 API 是否兼容。无需新增 schema migration。
