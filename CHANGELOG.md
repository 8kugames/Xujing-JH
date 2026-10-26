# Cyber-Jianghu 更新日志

---

## [Unreleased]

### Chore

- **移除过渡期旧资产名**（release）：CI 不再上传 `cyber-jianghu-*` 资产副本，Release 资产收敛为 `xujing-jh-*`；运行时标识与兼容变量保持不变。

## [0.2.2] - 2026-10-27

### Refactor

- **项目内统一更名 Xujing-JH**（全仓）：文档、白皮书、QuickStart、面板与注释文案统一；4 个 crate 包名改为 `xujing-jh-*`，server/agent/embedding 二进制与 CLI 名改为 `xujing-jh-*`。
- **兼容策略**：Rust 库名 `cyber_jianghu_*`、37 个 `CYBER_JIANGHU_*` 环境变量、数据库/数据目录/容器/网络/镜像 tag/volume 名保持不变；模型仓 `Cyber-Jianghu-Decision-2B` 与契约 `$id` 不改。

### Upgrade Notes

- **过渡发行**：Release 资产同时发布 `cyber-jianghu-*` 与 `xujing-jh-*` 两套文件名。旧 agent 继续按旧名自更新；新 agent 使用新名。
- 已部署 agent 原地自更新后路径不变，systemd/脚本无需立即修改；新安装使用 `xujing-jh-agent`。
- 旧资产名副本将在后续发行周期移除。

## [0.2.1] - 2026-10-26

### Features

- **自更新源仓库自动迁移**（agent）：`agent.yaml` 中历史 `update.repo: 8kugames/Cyber-Jianghu` 在反序列化层自动归一化为 `8kugames/Xujing-JH`，并由 `Config::from_file` / `load_update_config` 原子回写配置文件（写入失败仍使用新值）；已部署 agent 无需手工改配置即可继续接收后续 Release。
- **项目版本唯一真源迁移至仓库根 `Version`**（server + build）：server 通过编译期 `include_str!` 嵌入项目版本，`/api/v1/version` 与 `/health` 返回项目版本而非 crate 版本；主/CI Dockerfile 同步复制 `Version`，pre-commit 维持 crate 版本独立演进（版本双轨制）。

### Upgrade Notes

- **仓库更名 `Xujing-JH`**：GitHub 旧地址（clone/API/Release）自动重定向；CI 新镜像为 `ghcr.io/8kugames/xujing-jh-server`，旧镜像包保留但不再更新，外部拉取方需同步调整。
- **品牌标点统一**：文档、面板与安装脚本中的「虚境：江湖」统一为「虚境·江湖」。
- **pre-commit**：恢复 bash shebang，避免钩子解释器回退导致输出污染。

## [0.1.370] - 2026-10-06

### License

- **许可证迁移至 Apache-2.0 单许可**：MIT OR Apache-2.0 双许可收敛为 Apache-2.0——LICENSE 全文替换，移除 LICENSE-MIT/LICENSE-APACHE，三个 crate 的 Cargo.toml license 字段与中英文 Readme、WHITEPAPER 合规章节同步更新。

### Features

- **本地 2B 决策模型管线**（agent）：专用小模型出结构化意图、LLM 仅出认知摘要的两段式路径——认知-only 阶段（think_cognition_only）→ act1/act2/实体绑定逐问题读出（letter token 映射，与评测脚本逐字一致）→ 置信度门控（默认 0.7）→ 构造 Intents；任何阶段失败回退既有 LLM 路径（60s 冷却防抖）。新增 `component/decision_model/` 七模块：manifest（sha256 流式校验/子目录路径防御）、downloader（ModelScope 主源+GitHub 备源/Range 断点续传）、server（llama-server 子进程懒启动/健康检查/tokenize 校验）、prompt（jevfmt 逐字移植）、questions（结构化候选+门控绑定纯函数）、sys_memory（MemAvailable+cgroup v2，低配自动降档 q4_k_s）、metrics（/api/v1/metrics decision_model 小节）；管理端点 /api/v1/decision-model/{status,events}（SSE 下载进度）。生产实测：eligible 口径采纳率 ~82%，采纳意图服务器侧 100% 接受，2B 推理 avg ~1.7s。
- **主从跨 Provider 场景分流与面板模型管理**（agent）：llm_secondary 从模型支持独立 Provider/密钥/参数，场景级路由 scenario_routing 主/从选择（轻量场景默认走从）；面板主/从模型独立配置块（统计/状态/启停/流式/高级参数/备用）、场景分流独立配置块；启停开关同时生效主从，从模型跟随态时开关锁定镜像主模型。
- **决策模型双部署模式**（agent）：local（下载 GGUF+llama-server 自启动）与 remote（URL 端点，remote_model 多模型网关路由，支持第三方 API）分列配置；docker 部署默认 remote 模式（网络发现 `http://decision-model:8081`，不重复下载）；未就绪/端点不可达/配置非法均干净回退 LLM（死端口实测每 tick 回退+冷却防抖）。
- **dm 管线运行时动态校验**（agent）：构造结果按服务器下发动作契约（available_actions，与决策 prompt 同源）自检——typed 闭集必须对象+required_fields 齐备、演化动作按 required_fields 分档、下架动作显式回退；上线当日拦截「取」缺 quantity 真实契约缺口。
- **LLM 场景级成本分层**（agent）：task-local 场景标签、按场景 token 记账与 scenario_overrides 模型路由。
- **SFT 导出归一历史动作名**（server）：丢弃工具残留，导出样本动作名与现行词表对齐。
- **SFT 数据准备格式纠错反馈合成增强**（training）：错误样本合成纠错反馈增强训练信号。
- **训练脚本入库**（training）：天魂标签解析、SFT 数据准备、评测脚本入库替代交接文档。

### Bug Fixes

- **决策模型观察缺 action_data**（agent）：dm 路径「观察」（无目标环顾/act2）此前提交 None 被服务器 typed 解析全量拒绝（生产实测 30/30 失败而本地采纳率正常，双真相分叉）；补空对象修复，服务器侧 16/16 全过。
- **act2 答「无」不再构造后续 intent**（agent）：「无」是 act2 选项（无后续动作语义），此前被当作 action_type 提交致天魂驳回并污染整条原子队列（触发自纠/chaos 多耗两轮 LLM）。
- **dm 取 动作补 quantity 字段**（agent）：动态校验实战拦截的 required_fields 缺口，补默认 quantity:1。
- **auto-rebirth 成功后立即落盘**（agent）：此前只写内存 pending，进程在主循环持久化前重启即永久丢档（转世后失联、触发多余自动注册）；现成功分支先落最小档案兜底。
- **query_world environment 返回物品明细**（agent）：此前只返回 nearby_items_count 计数，角色拿不到物品名称/ID 无法构造取/采集意图（连续两世脱水致死的直接断点）；补 nearby_items（name_ref 可照抄）与 gatherable_items（含存量）明细。
- **sys_memory Linux 分支两处编译/lint 修复**（agent）：unwrap_or_else(|| None) 类型错误（5×E0308）与冗余 trim() lint——macOS 本地 clippy 不覆盖 cfg(linux) 分支，均已用 clippy-driver --target musl 建立交叉验证。
- **认知重试格式错误反馈剥离技术细节**（agent）：serde 报错原文不进重试 prompt，连续失败干净重试。
- **trace 回传 sender 可重注入**（agent）：server 重启后回传不再静默失效。
- **训练导出参数绑定修复**（server）：SET LOCAL 绑定参数与 wall_clock 双格式解析。

## [0.1.366] - 2026-09-18

### Features

- **资源点存量/枯竭模型**（server+protocol+agent）：可采集资源持久化于 `resource_nodes` 表（migration 026），采集在 Saga 事务内扣减（`stock >= quantity` 守卫，枯竭返回「已被采光」并可整体回滚）；每日再生受四季 `resource_growth_rate` 加成（冬季枯竭春季复苏，上限 `max_stock` 截断），由 scheduler 日历日递增触发点驱动（与 reward 日结算同钩子，无相位错位）；locations.yaml 以 `gatherable_stocks`（max_stock/init_ratio/regen_per_game_day）声明，未配置 = 不限；WorldState 广播 `GatherableItem.stock`（缺省 = 未启用），agent 可采集列表渲染「野果（余 N）」驱动换地/换时策略；`PROTOCOL_VERSION` 3.2.0 → 3.3.0（additive minor）。设计文档 docs/features/resource_depletion.md。
- **claw 协议面多意图**（agent）：`UpstreamMessage::Intent` 加 optional `subsequent_intents`（serde default 旧上游兼容），贯通 `WsIntent` → `Intent.subsequent_intents`，外部调度器可携带原子意图队列（server 端按序原子执行）；配套 Openclaw 仓发送侧待跟进。
- **api_key 支持环境变量引用**（agent）：`llm.yaml` 的 api_key 接受 `${VAR}` 形式（运行时展开，变量缺失告警置空），yaml 不再需要落盘明文密钥（`resolved_api_key`）。
- **注意力丢弃可观测**（agent）：FocusSummary 超 `max_focus_items` 的非关键候选以 debug 日志记录丢弃数与 field 清单——lean prompt 盲区量化入口，不改变过滤行为。

### Bug Fixes

- **声望负值不可达**（server+protocol）：`AttributeValue::Static` 由 u8 改 i32，钳制统一由 `StatusComponent::apply_change` 按配置 `min_value` 执行——此前声望（min=-100）经正确计算后被 `set()` 硬钳回 0，负面声望机制（身败名裂）不可达；WorldState wire 不受影响（self_state.attributes 本为 i32 映射）。
- **治理提案重开断链**（server）：admin 关单补 `stage='done'`（reopen CASE 仅认 done，否则同类新提议追加进已关闭 group 永不重审）；提案取样改 DESC（引擎按 first() 取样，重开场景审触发重开的新证据而非上一轮最旧提案）。
- **每日结算相位错位**（server）：触发从 tick_counter（进程 ordinal）取模改为日历日号递增检测——重启后计数器归零而 tick_id 相位任意导致结算窗口偏离真实游戏日边界（reward 记账跨日污染）；现重启安全（日中启动只记基线）、单调日号防重复。
- **休整零成本永动机回血**（server）：休整动作加 satiation/hydration `min 2 cost 2`（hp 无被动恢复，休整为其唯一渠道，此前 +2/tick 约 25 游戏时白嫖回满）；数值调参入口在 actions.yaml。
- **季节乘数无保底**（server）：`TimeData::validate` 加载期拒绝负值/NaN 的 `resource_growth_rate` 与 `attribute_modifiers`（负 modifier 会使衰减反向变增量）。
- **认知重试无墙钟预算**（agent）：重试循环加 300s 预算，超时跳出走休整降级（此前 12 次 × 120s 请求超时可空转数十分钟）。
- **记忆重要性退化**（agent）：叙事合成条目继承源事件分数（最低源分、下限 0.5）替代恒 1.0——恒 1.0 使 importance 排序退化、与固化记忆平权霸占 top-K。
- **对话脏历史**（agent）：对话历史写入移到 CognitiveValidator 验证之后，被驳回轮次不再入库永久驻留并在后续 prompt 回放。
- **prompt 裸属性名**（agent）：FocusSummary 属性描述改用中文显示名（narrative_config.display_name 数据驱动注入 + 静态兜底），不再向 LLM 暴露 satiation 等英文 key。
- **martial 技能触发死引用**（server）：三技能 trigger_categories 与演化 effect_refs 的 "martial" 改 "combat"（动作体系无 martial 类别，该键计数恒 0；combat 类攻击计数现真实驱动技能习得）。

### Refactor

- **超限文件清零与去冗战役**（全仓）：>800 行文件 32 → 0（llm client/direct_client、websocket handler、actor engine、transport websocket、realtime、agent_ops、scheduler、main.rs 1555→19、CLI bin 1649→302 等 16 个文件模块化拆分，外部路径经再导出保持不变）；复制粘贴收敛唯一事实源（ConfigUpdate 构造器、TickStatus/展示名上移 protocol、LLM 重试/流式消费/fallback 单源化、SSE 工具、AgentClient 宏化转发）；10 文件单测外移（`#[path]`，测试代码零改动）；每批 fmt/clippy/全量测试三重门禁，全量 1187→1195 全绿。

## [0.1.350] - 2026-09-15

### Features

- **人魂 Layer 0 目标校验优化：物品引用四形态解析与可照抄纠错回路**（agent）：物品引用统一接受四形态并归一化回写完整 uuid（完整 uuid / 名称[短uuid] / 裸中文名 / 短 uuid 前缀唯一匹配自动解析）；prompt 背包/附近/可采集渲染与全部天魂拒绝消息改为「名称[短uuid]」可照抄形态（消除完整 uuid 复制臆造英文 ID 的根因）；天魂驳回跨 tick 留痕（「上轮意图驳回记录」注入下一回合决策上下文，TTL 自过期）；空 item_id 专属指引与配置化唯一候选回填（`auto_fill_unique_item`，默认关）；自纠反馈结构化（复述原意图 + 定向修正指令）；Layer 2 规则链感知对齐（「取→用」链内动作不再被 valid_item_id_use 误拦）；物品展示格式单一真源上移 protocol（server/agent 同源防漂移）；layer0 拒绝消息模板化（`reject_feedback.layer0`）+ 模板占位符缺失自检告警；get_action_detail 提示与认知上下文「地上有…」同步可照抄口径。
- **Agent 自动更新（GitHub Release）**（agent）：新增 `infra/updater` 自更新模块——更新判定用 digest 恒等比较（当前 exe sha256 vs 最新 release 平台资产 digest，规避 tag=server 版本与 agent 版本不可比问题），下载后 sha256 校验（fail-safe：缺 digest 或校验不符拒绝安装）；apply 进程内互斥串行化（后台任务与手动触发并发不重复下载安装），安装后失效 digest 缓存使后续判定反映新文件；后台周期检查（默认 6h+抖动）自动下载安装并重启（unix execve 自替换/Windows exe.old 让位）；新增 CLI `cyber-jianghu-agent update [--check-only]` 与 HTTP 端点 `GET /api/v1/update/status`、`POST /api/v1/update/check`、`POST /api/v1/update/apply`（Bearer 认证）；面板设置页新增「版本与更新」卡片（当前版本/digest、最新 release、检查与安装按钮，守卫原因可见）；容器内（/.dockerenv）与 cargo 构建产物（target/ 下）自动跳过，`CYBER_JIANGHU_SELF_UPDATE=0` 可硬禁用；配置项见 agent.yaml `update` 段（enabled/auto_apply/check_interval_secs/repo）。

### Bug Fixes

- **生存节奏哨兵失守：满值饿死偏早 1 tick**（server）：`3f75732d` 将游戏日 12→24 tick 并放宽至 7 游戏日，但 decay 0.6 实际 167 tick 死亡（6.96 游戏日）且哨兵测试未同步；衰减精确化为 0.5955（截断补偿后恰第 168 tick = 第 7 游戏日末），哨兵测试 `survival_pacing_test` 对齐 24 tick/7 日新节奏。

## [0.1.345] - 2026-09-15

### Features

- **好感度评估注入身份/性格/关系现状**（agent）：好感度评估不再只看交互历史，注入双方身份、性格与关系现状，产生主观认知分歧。
- **经历日志按 tick 卡片重设计**（dashboard）：经历流水按 (agent, tick) 聚合为卡片视图，补现实时间与卡片级成败徽章。
- **sqlx 编译期校验宏迁移与活库守卫体系**（server）：静态 SQL 两批共 34 条查询迁移 `sqlx::query!`/`query_scalar!` 宏，幻表/幻列/解码错配在编译期归零（`.sqlx` 离线缓存入库，CI 注入 `SQLX_OFFLINE=true` 覆盖四平台离线构建）；新增活库守卫测试 `sqlx_live_schema_guard_test`（4 条夹具用例，覆盖背包 SUM 解码、survival_time 聚合与两条动态拼接 SQL 路径）与每晚定时门禁 `sqlx-guard.yml`（postgres service 容器驱动）；AGENTS.md 增设 SQL/sqlx 规约章节（聚合解码类型表/禁止解码点吞错/prepare 工作流）。

### Bug Fixes

- **「背包持有量查询失败（服务端存储异常）」根因修复**（server）：PostgreSQL `SUM(int4)` 返回 BIGINT 被误以 i32 解码，吃/喝/用持有预检恒失败（线上 Agent 无法进食的根因）；修复解码并补底层错误日志。
- **telemetry survival_time 从未成功采集**（server）：`EXTRACT(EPOCH)` 返回 numeric 被 `.ok()` 静默吞成 None，且 SQL 引用不存在的 `game_rules_config` 表与 `deployment_time` 幻列致每轮必败；tick 秒数改由内存 game_data registry 注入。
- **deaths 时间线 death_tick 系统性放大 120 倍**（server）：幻表查询失败后 tick 秒数兜底 1.0（真实配置 120 秒/tick）；改从内存 game_data 读取并修正幻列。
- **get_last_tick_time 引用 tick_logs.created_at 幻列**（server）：表内仅有 started_at/completed_at，该函数恒失败（死导出未暴露）。
- **action_outcomes 遇 NULL result 组运行期解码必炸**（server）：result 列可空，宏在编译期强制暴露，NULL 组映射 "unknown"。
- **chronicles 五个 JSONB 列与 created_at 可空崩溃隐患**（server）：旧实现在 NULL 上解码崩溃，宏暴露后降级空集链。
- **关系图谱反查表键序颠倒**（admin）：反向认知恒等于好感度。
- **分页偏移量溢出族收敛**（handlers）：越界页不再 panic。
- **模型上报空值归一**（agent）：空转与后续意图不再写 None。

## [0.1.340] - 2026-09-15

### Features

- **LLM 连接信息全量环境变量注入，llm.yaml 转为可入库模板**（server）：`load_llm` 支持 `CYBER_JIANGHU_LLM_ENABLED/_PROVIDER/_BASE_URL/_API_KEY/_MODEL` 覆盖对应字段（env 非空优先，bool 宽松解析非法值告警忽略）；面板保存强制剥离 api_key（密钥永不落盘）；解除 `crates/server/config/.gitignore`，`llm.yaml` 以惰性模板（enabled=false、连接字段留空）入库，运行时完全由 `.env` / 部署环境供给；QuickStart-Server 补全变量表。

### Security

- **清除线上基础设施信息**（security+deploy）：私有一键部署脚本 `.test-agents/push_server.sh` 退出版本控制并从全部 git 历史清除（本地保留使用，不入库）；`ship-server-binary.sh` 移除内置远端默认值（SERVER / REMOTE_PROJECT 必填）；`agent.yaml.example` 示例地址改占位符；`assets/images` 退出版本控制并从历史清除；`scripts/` 按功能分组（deploy / data / qa）；同步清除历史中 `.claude` 遗留文件。

### Changed

- **基镜像自举自 restart.sh 下沉至 build-agent-image.sh**（deploy）：消除依赖倒挂——入库工具 `build-agent-image.sh` 缺基镜像时不再报错指向 `.test-agents/restart.sh --build`，改为缺失自动制备（docker run + apt 网络路径，自举逻辑逐字迁移自 restart.sh 的 ensure_base_images）；基镜像在位时零开销不触网。`restart.sh` 删除该函数（净减约 35 行），`--build` 语义不变；同步修正联调 SKILL 中脚本的过期路径。

- **部署链路收敛：server 运行时镜像配方单一来源化**（deploy）：新增 `crates/server/Dockerfile.runtime`（与主 Dockerfile Stage 2 同步的"二进制注入"配方），`ship-server-binary.sh` 远端不再用 Python 正则 patch 主 Dockerfile + trap 还原，改为直连 `docker build` 打 runtime 镜像（只做 COPY 打包，秒级完成）；`docker-compose.prod.yml` 的 server 服务补显式 `image: cyber-jianghu-server:binary-runtime`（compose `up -d` 依据 tag 指向的新镜像 ID 自动重建容器）。远端部署不再依赖 python3。
- **交叉编译共享助手 build-linux-binary.sh**（deploy）：zigbuild 工具链预检（cargo-zigbuild/zig/rustup target）+ 编译 + md5 + `.bin/` 本地留存的单一来源，stdout 仅出 md5、日志走 stderr；`ship-server-binary.sh`（server）与私有的 `.test-agents/push_server.sh`（agent）共同委托。附带修复 push_server.sh 缺失工具链预检的问题（此前缺 cargo-zigbuild 会以晦涩报错失败）。

### Bug Fixes

- **远程部署漏同步静态资源**（deploy）：`ship-server-binary.sh` 仅全量同步 `config/`、另按 git 未提交集合同步 dirty 文件，导致已提交的 `crates/server/static/` 改动不进入远端构建上下文，镜像内 `/app/static` 停留旧副本——表现为服务端版本已更新、管理面板仍跑旧 JS（如关系图谱页报错）。现补 `static/` 全量同步，与 `config/` 同级对待。
- **管理面板静态响应补缓存指令**（server）：`serve_admin_file` 此前只设 `Content-Type`，浏览器可对 `/admin/*` 资源做启发式缓存，部署后容易产生"服务端已更新、面板仍旧行为"的误判。现统一加 `Cache-Control: no-cache`（面板资源不带内容哈希且运行时按请求读盘，必须每次向服务端校验）；远程部署文档运维节补对应排查判据。
- **部署脚本迁入子目录后根目录推导失准**（deploy）：`ship-server-binary.sh` 与 `build-agent-image.sh` 迁入 `scripts/deploy/` 后仍按 `dirname/..` 推导 `PROJECT_ROOT`，解析结果落在 `scripts/` 而非仓库根，会使 config/static 同步源、zigbuild manifest 与产物路径、工作区挂载全部落空（`set -euo pipefail` 下直接中断）。两处改为 `/../..`，并同步脚本头部的用法路径。

### Chore

- **补齐部署链路收敛文档**（docs）：联调 SKILL 工具链表补远端更新脚本行、`restart.sh --build` 语义更新为委托 `build-agent-image.sh` 增量构建；远程部署文档运维节补版本更新链路；EN QuickStart-Agent 同步 loopback 认证注意事项。

## [0.1.322] - 2026-09-14

### Features

- **角色社会语义完善**（agent）：关系名册同步、魂纪事空转占位、归隐终态收敛、SSE 流修复；名册同步机械迁移至独立模块 `roster_sync`。
- **关系图谱有向视图接入管理面板**（admin）：关系页适配打平响应并归一化渲染契约，同步文档修正。
- **经历独立页面**（agent-panel）：新增 standalone experiences 页面，支持分页与 tick 跳转。
- **纪事归隐终态采集与展示**（chronicle）。
- **用/予执行前背包持有预检**（server）：give/offer 类动作在执行前校验背包持有。
- **健康看板行为多样性改用 top-share 口径**（admin）。
- **部署链路收敛**（deploy）：push_server 同步更新远端 agent、配方单一来源、ssh 参数边界修复。
- **面板 URL `?token=` 直接认证**（panel）：支持带 token 直达进入面板。
- **背包物品卡片改版为分行展示**（admin）。

### Bug Fixes

- **混合自纠避免人魂对不可见目标反复踩坑**（agent）。
- **分级审核未知动作改为 fail-closed**（reflector）。
- **多意图天魂审查结果逐意图聚合记录**（soul-cycle）；空转占位记录补写世界时间并向查询接口暴露 `route_type`；记录后 chaos 覆写留痕补全。
- **物品来源分类收窄消耗类校验**（soul）：chaos/自纠链路留痕补全。
- **F6 审查建议项落地**（server）：回滚原因收割、DB 错误透传、文案前缀、干跑接线。
- **item_exists 严格 uuid 审查**（action）：修复分级跳过层误判为失败；历史快照中分级跳过层强制按通过渲染（panel）。
- **读写分权路由 GET 被 write layer 误包**（server）：修复只读直达链接弹鉴权窗。
- **row_to_memory 按列名取值**（memory）：防 `SELECT *` 列序错位。
- **SSE 广播 Lagged 降级为告警而非断流**（agent-api）。

### Refactoring

- **移除未实现的 minimum_per_tick 配置**（protocol）。

### Chore

- **pre-commit 增强**（githooks）：新增 fmt/clippy 质量前置检查；暂存区快照校验的 stash 隔离与冲突规避。
- **restart.sh 统一 SCRIPT_DIR 提取**（test-agents）；固化记忆通道元游戏词黑名单大小写敏感取舍的单测（core）。
- **远程部署文档对齐面板 `?token=` 认证与接入链接契约**（docs）；PROTOCOL_VERSION 描述同步至 3.2.0。
- **格式化清理**：rustfmt `reporting.rs`、admin `index.html`（无行为变更）。

## [0.1.311] - 2026-09-13

### Features

- **位置层级链 parent_chain 下发**（protocol+server+agent）：`Location` 新增 `parent_chain` 祖先名称链（PROTOCOL_VERSION 3.1.0 → 3.2.0，`world_state.schema.json` 契约同步）；server `ancestor_names` 沿位置图上溯生成，三处 WorldState 广播填充；agent 层级表述（父链去区域级、「·」连接）统一 character_info/context/cognitive_context。loader fail-fast 收紧：根节点必须 region、父链不得成环（pin 住 chain[0] 区域假设与上溯终止性）；ancestor_names 护栏截断与链断裂路径补 warn。
- **setup token loopback 门控 + 面板显式横幅**（agent）：`setup_status` 的 auth_token 仅对 loopback 对端返回（fail-closed + `to_canonical` 归一化 v4-mapped）；面板补未获 token / 401 失效 / SSE 停连三类显式横幅，替代静默降级。

### Chore

- **server 地址迁移 agent.yaml + 远程部署栈**（deploy）：server 地址从 compose 环境变量（agent 从未消费的死配置）迁移至各实例 agent.yaml server 段；restart.sh/monitor-24h.sh 解析源同步切换（4 实例一致性 FATAL）；联调 SKILL 与三处文档对齐；新增远程部署文档 `QuickStart-Remote-Deployment.md` 与 `docker-compose.remote.yml`（token 带外交付、loopback 失真披露、embedding 同机共存注意）。

## [0.1.310] - 2026-09-12

### Features

- **移动目标规范化 + 意图组逐项裁决反馈**（agent）：`canonicalize_move_target` 在 validate_pipeline 单一收口点下沉 LLM 写的叙事短名/AdjacentNode 名/复合写法（如"龙门客栈-厨房"）到精确 node_id（匹配顺序：精确 ID → 相接节点名 → 后缀/前缀/包含，唯一候选原位改写，零候选或多候选保持原值照常驳回；7 个单测覆盖短名/精确/邻接名/复合/无匹配/多候选/非移动动作共 7 路径）；soul_cycle 逐 intent 记录通过/驳回（带动作名 + 序号），驳回反馈前缀"意图组审查结果：..."，含通过项明细 + 驳回详情；agent.rs 短路该前缀避免被下游叙事化分支吞掉。实测：移动"厨房"/"客栈"从全量驳回变为端到端 node_id 携带通过；意图组 self-correction 现在能精确知道是第 N 项哪个动作被驳回。

### Bug Fixes

- **健康度看板只读 Token 不可见**（server）：admin 前端 auth.js 新增 `applyHealthTabVisibility`，健康度页签（data-tab-id="health"）仅对 write Token 展示；只读 Token 隐藏该内部验收观测视图。登录/换 Token 后由 completeLogin 刷新；脚本置于 body 末尾，加载时导航栏 DOM 已就绪，无健康度页签的页面为空操作。

### Chore

- **本地留存 server 二进制产物副本**（deploy）：ship-server-binary.sh 在 scp 前 mkdir -p .bin && cp $BIN .bin/server-bin（与远端 .bin/server-bin 同名同内容），便于本地核对 md5 与回滚；备份失败仅警告，不阻塞部署。

## [0.1.309] - 2026-09-11

### Refactoring

- **时间换算真源收敛完结 + 全局措辞清理**（server）：`try_game_day` 补 `ticks_per_hour` 非法校验（fail-fast 契约闭合）；新增 `TimeRegistry::game_datetime`（年月日展开唯一真源，日历模型 = time.yaml），收编最后两处内联换算——chronicle generator `format_tick_range_chinese` 与 dashboard stats（stats 原自建 30×12 日历且缺 rspt 因子，按 shipped rspt=120 显示比真源快 120 倍，本修为与 WorldState 同构）；broadcaster `compute_game_time` 改为真源委托；`real_seconds_per_game_day` 随调用方归零删除；860 行 `decay.rs` 拆分为 `decay/{mod,death,age}.rs`（衰减引擎/死亡通知/年龄换算，re-export 保持 `tick::decay::*` 路径不变）；全仓清除 Reward 模块旧标签措辞（reward.yaml/reward 模块/summary 等 7 处，统一为「生存 Reward」）；修正 skill_mutator 指向已删 broadcaster.rs 的注释路径。（终审建议项 1-7 落地）
- **地点/时间换算单源化 + 广播器拆分**（server）：新增 `TimeRegistry::game_hours`/`try_game_day` 作为全仓唯一 tick→游戏时/日换算真源，收编业务侧 4 处内联公式拷贝（chronicle `calculate_game_days`/`collect_agents` 周期日、broadcaster `compute_game_time`、decay `compute_age_years`，另 time_registry 内部 3 处归一；补等价性钉死测试）；修复 `from_config` 丢弃节点级 `implicit_travel_cost` 的既有 bug（shipped 配置无此字段，零行为变更）；`resolved_description` 接线 dashboard `GET /api/dashboard/locations`（additive：`game_day` + `resolved_descriptions`）；947 行基线 `broadcaster.rs` 拆分为 `broadcaster/{mod,world_state,time,recipes}.rs`（对外路径不变），`cache.rs` 同步拆出 `location_registry.rs`（两文件均回落 800 行上限内）。

### Features

- **地点时代显隐 time_variants**（protocol+server）：`LocationNode` 新增可选 `time_variants`（游戏日闭区间，首个命中生效），命中 `visible: false` 时段的地块从 WorldState 邻接中隐去且移动终点校验拒绝（起点豁免，与传灯录同语义）；命中时段 `description` 覆盖基础描述。时间基准统一为 `TimeRegistry::game_day(tick)`（executor 与 broadcaster 同源）。PROTOCOL_VERSION 3.0.0 → 3.1.0（additive optional field）。
- **地点图数据画像守卫**（server）：新增 `locations_graph_integrity_test`（全图连通/单向边画像/travel_cost>=1/任意两点最短<=6 tick 预算/出生点全域可达/时代变体自洽）；`load_locations` 加载时 fail-fast 校验悬空边端点、悬空 parent_id、重复 node_id、倒置区间，非对称边仅告警。语义唯一事实文档见 `crates/server/docs/architecture/p0_core/locations_graph.md`。（模式吸收自传灯录拓扑地图）

### Bug Fixes

- **意图失败原因误报"状态持久化失败"**（server）：验证/执行失败经 rollback 后一律误报 persist_failed，掩盖真实拒绝原因（实测"未知的动作类型"被包装成持久化故障，误导诊断且 Agent 无法自纠）。修复：SingleProcessingResult 增加 failure_reason，验证/执行失败走 action_failed 回传具体原因（含治理分类码），仅真实落库失败才报 persist_failed。
- **Agent 动作词表漂移无法自愈**（server+agent）：server 部署/热更新动作配置后，运行中 Agent 仍持旧词表提交已下线动作（实测 Agent 持 20 旧名 vs 部署 actions.yaml 12 新名，全量拒绝）；且 action_update_callback 从未接线，server 的动作 ConfigUpdate 推送全部落空。修复：接线回调（刷新引擎词表+持久化 actions.json）；server 在 UnknownAction 拒绝时即时推送最新动作配置，形成自愈闭环。
- **理智末日时钟（全员永久混沌）**（server+agent）：`get_recovering_attributes` 的 decay≠0 守卫使 sanity 的 recovery_formula 永不生效——理智每 tick 净流失 1 点且无任何恢复路径，跌破混沌阈值 30 后 ChaosGenerator 丢弃全部 LLM 推理决策（实测 4 agent 理智 7-20，"推理与裴沈对话 → 实际提交随机使用/修炼"）。修复：恢复公式按语义分层——decay=0 属性无条件恢复，decay≠0 属性（sanity）仅休息 tick（本 tick 窗口无 intent）恢复；idle-skip 空转/离线/思考间隙均自然计为休息（身体没在做事 = 休息）。IntentWorker 新增 last_intent_ticks 追踪作为休息判定的反向信号。
- **注册 nil 永久等待转生**（agent）：容器重启/断连期间角色死亡后重连，注册返回 nil 即进入等待转生模式且无人唤醒（实测 agent-3 断连 45 分钟无重连、角色死 3 小时未转世）。修复：该入口在 auto_rebirth 开启且本地角色为 Dead 时自动调度转世（game_rules 未到达时回退出厂默认 5 tick）；等待循环增加 5s 轮询，转世完成后立即重连（peek-成功后消费，失败保留下轮重试）。

### Bug Fixes（前序）

- **动作统计泄露 Agent 主观记忆**（BREAKING，agent+server+protocol）：移除 `ServerMessage::DailySummaryData` 推送链路（scheduler 广播 → callbacks 写入 episodic）。客观动作统计（计数/成败/足迹）进入主观记忆后以 0.8 重要性霸榜日记取材 top-K，导致日记复读与 OOC 污染（"今日动作统计仅两次"式叙述），并回流决策上下文与 SFT 导出。PROTOCOL_VERSION 2.0.0 → 3.0.0。附带：Agent 启动时幂等清理遗留 `daily_action_stats` 记忆；日记取材排除 `daily_summary`/`daily_action_stats` 元条目，切断"改写昨日日记"复读环。

## [0.1.297] - 2026-09-10

### Major Features

- **client P1-P7 契约前置**（agent+server）：state/stream SSE 复合流、独立 `protocol_version` 双侧 version 端点、静态 token 并集鉴权（`CYBER_JIANGHU_AGENT_TOKEN` ∪ device token）、契约 JSON Schema 片段（docs/contracts/）、memory `?since=` 增量补帧、characters id 路由
- **物品/配方全面 uuid 化**：物品与配方标识统一为 uuid，展示名统一为 `名称[短uuid]`

### Bug Fixes

- **死亡链路与目击传播**（BREAKING，agent+server）：修复死亡事件传播链路，移除教训广播改为纯涌现（f4a2da1c）
- **refresh_auth_token 读锁自死锁**（agent）：读锁未释放导致注册重试自死锁（fd661a5c）
- **dynamic_persona 死接线**（agent）：接通断线调用，state/stream 恢复主角名/情绪显示（4abf90ef）
- **LLM 调用弹性**（agent）：429 分级冷却自愈、认知重试退避、认知/日记 schema 容忍（a11049a5）
- **群像传记 modal 滚动条**（admin，555a26fc）

### Performance

- **tick 调速与成本杠杆**：tick 120s + 空转跳过昼夜节律 + 四条 LLM 成本杠杆（53a2e8b9）

### CI

- **quality 质量门**：发布管线新增 fmt/clippy/nextest 门并与 build 并行，结果串入 docker-build/release 守卫——杜绝 v0.1.292 式"tag 发布成功而 main/dev clippy 红"的带病发布；同步修正 job 注释（1da6c229）
- **pre-commit 对齐**：不再尝试入库 Cargo.lock（对齐 untrack 决策），输出消歧显式播报（e511c49d、736a3ec0）

### Build

- **依赖版本地板三段化**：Cargo.lock 不入库前提下，workspace.dependencies 与各 crate 直接依赖全部收紧到当前最新解析的三段版本地板（tokio 1.53.1、clap 4.6.6、candle 0.10.2 等），收窄 CI 解析漂移（9941f313）

### Tooling

- **/release 流程与 hook 对齐**、**pre-commit 版本号控制落地**（承接自上周期 Unreleased 条目，随本版发布）
- **联调工具链**：一键部署注册、离线构建、健康快照（check-round.sh）、监控链整合（9007cd2f 等）
- **.gitignore 补 `!.github` 例外**：`.*` 通配误伤 workflow 目录，新 workflow 文件不再被静默忽略（c1464d04）
- **验收快照输出迁移 `./.tmp`**：对齐 .gitignore/.dockerignore 忽略规则（363d8d13）

### Refactor

- **soul_cycle 托梦域拆分至 dream.rs**（agent，文件行数治理，55293309）

### Tooling

- **/release 流程与 hook 对齐**（`.claude/skills/release/SKILL.md`）：重排为「先提交全部代码（hook bump 落定）→ 读定稿版本转正 CHANGELOG → 仅含 CHANGELOG.md 的发版提交（不触发 bump）→ 打 tag」，保证 tag v<VER> = 打 tag 时 Cargo.toml = CHANGELOG [VER]，消除旧流程 tag 落后 1 个 patch 的错位
- **pre-commit 版本号控制落地**（`githooks/pre-commit`）：吸收并删除 `scripts/version-bump.sh`——暂存区含 `crates/<crate>` 的 .rs/.toml/.yaml 变更时该 crate 版本 patch +1，同步依赖方 path 依赖版本，被改动的 Cargo.toml 与 Cargo.lock（`cargo update -w` 同步刷新）自动 git add 并入本次 commit（补齐原脚本“声称已 add 但未实现”的缺口）；CRATES 清单补上 workspace 成员 embedding；移除会吞依赖名的 sed 回退分支，统一走 perl 并前置快速失败；patch 段 10# 强制十进制防前导零。激活：`git config core.hooksPath githooks`（`install.sh` 任意命令执行时幂等自动激活）；跳过：`git commit --no-verify`

## [0.1.292] - 2026-09-06

### Major Features

- **WitnessedDeath 目击死亡特质演化**（白皮书 05_心智模型 §5 压力源落地）：死亡通知具名化（`witness_description`），死亡善后向同位置存活 Agent 的 events_log 写入 DeathNotification（记忆 + 特质演化规范通道，best-effort）；persona_event_rules 新增 WitnessedDeath→恐惧/沮丧规则（26→28 条，EXPECTED_RULE_COUNT fail-fast 门禁同步）；query_world↔compactor 合同测试锁定 execute_query_world 输出与 compact_tool_result 读取的 JSON 键契约，防 compactor 静默失效

### Bug Fixes

- **目击者假死回归**（agent）：lifecycle 路径 1 的死亡检测原用 `any(DeathNotification)` 判定自身死亡、不校验死者——目击他人死亡即触发 handle_death，is_dead 永久置位，而 server auto-rebirth 按 `status='dead'` 守卫拒绝活体重生，目击者永久停在决策跳过循环。新增 `find_self_death` 比对 `metadata.agent_id` 与自身 ID；身份无法核对时 fail-safe 不触发（误报不可逆，漏报由 AgentDied 回调路径兜底）；6 个单元测试锁定（目击不假死、自身死亡仍可检测、同 tick 混合日志、WitnessedDeath 特质演化联合合同）

### Tooling

- **验收 run 观测快照脚本**（`scripts/acceptance_snapshot.sh`）：定时抓取 健康度看板与涌现检测端点落盘 JSON 快照，只读观测不干预；配套 `docs/reports/acceptance-run-config-2026-09.md` 验收配置锁定与 run 纪律（涌现基线回溯报告按项目约定留盘 docs/reports/，不进 git）

## [0.1.291] - 2026-08-06

### Performance

- **LLM prefix cache 稳定化**（agent）：skill index 固定排序保证 system prompt 前缀字节级稳定；新增 system_hash 漂移告警（`cache_diagnostics` target）观测 provider prefix cache 失效

### Bug Fixes

- **prefix 漂移告警伪报**（agent，WI-010）：actor/validator 等调用类型共享同一 DirectLlmClient 并交替使用不同 prompt，单值"上一次 hash"比对在合法交替时持续误报。改为已知 hash 集合语义（容量 64，超限重置），仅全新前缀告警
- **诊断路径多字节 panic**（agent，WI-011）：tool_calls 预览切片与 JSON parse 错误日志在内容含中文（多字节）时按字节偏移切片 panic。新增 `utf8_safe_end` 回退到字符边界；JSON parse 错误详情直写 message
- **test-agents virtiofs 权限**：agent-5-longcat 目录经 virtiofs 映射为 root 属主，entrypoint chown 撞只读 trace.yaml 失败。设 `CONTAINER_UID/GID=0` 跳过权限修复

### CI

- pr-check 补 push 触发，gate main/dev 集成
- Docker job 移除 `cache-to`，根治 GHA cache not_found

## [0.1.290] - 2026-07-27

### Major Features

- **专用模型训练数据管线（reward + trace + SFT export）**：围绕"将 Agent 产生的 LLM 调用用于专用模型训练"目标，构建完整的数据采集→回传→导出闭环。哲学锚点：天道无为——reward 纯锚定生存因果，声望/关系/心境等主观认知不进 reward。
  - 生存 Reward（server）：每日结算（生存+生理+天魂审查三分量）+ 一生结算（寿数+统一死亡 penalty）+ 周期聚合 + 仪表盘 API（`GET /api/dashboard/reward/trends`、`/reward/lifetime/{id}`）；强制配置 `reward.yaml`（fail-fast），走 game_data 标准管线零硬编码；数据源改用 `agent_state_cache`（DashMap）消除时序竞态
  - 训练 Trace 结构化落盘（agent）：人魂/天魂 LLM 调用 JSONL（含 agent_id+tick_id+prompt/response 全文+soul_stage+persona+wall_clock），persona 字段替代 system_prompt 全文（~200B vs ~15KB），日志滚动覆盖（`max_size_mb` 配置，LRU 删旧）
  - **SFT 导出管线**（`src/training_export/`）：config 加载（复刻 action_evolution 模式 + env 覆盖）+ db 查询（`fetch_soul_cycle_metadata`，DISTINCT ON + UNNEST + SET LOCAL）+ runner（`run_once` 五步数据流）+ scheduler 后台 task（双层 timeout + sweep + shutdown）+ sft_transform 纯函数（对齐 Python `--no-db-filter`）+ checkpoint trace_id 集合与日期分桶 TTL；6 个 HTTP 端点（`/api/v1/training/export|exports|exports/{run_id}|exports/{run_id}/download|checkpoint`，写/读权限按 method 隔离）；cancel-aware 原子写 + 全量 env 覆盖 + per-bucket 容量 + 黄金对照测试基线
- **关系图谱（C1-C4 数据可达性）**：`agent_relationships` 表（迁移 022）+ Strategy B 全量快照同步（Agent 每游戏日上报，天然幂等）+ 关系/世界快照/地点/对话/死亡 dashboard 端点 + C2 鉴权档（`require_client_read_token`，`CLIENT_READ_TOKEN` 与 admin read 分离）
- **涌现检测接入 server**：causal_emergence / co_occurrence 检测 + 健康度看板 + Chronicle 叙事打磨；Validator 增强（物品/人员 ID 存在性校验，三端打通）
- **三魂元数据随 intent 提交**：消除独立 SoulCycleReport 的丢失风险（与 intent 同消息到达），执行结果回填

### Refactors（数据诚实化 / protocol 为唯一真相源）

- 枚举化穷尽匹配，消除 String 闭集与静默跳过：`OocRisk`、`ConfigType`、`EffectType`、`RequirementType`、`Operation`、`ValidationType`、`ItemType`（统一 5 变体，修复 Material/Tool 降级，删除 armor 死代码）、`LocationNodeData.node_type`（修复 region 被吞成 Map）
- 合并重复类型：`NarrativeThreshold`/`AttributeDriveConfig`（→ protocol）；`LocationNodeData` 改为 `LocationNode` 别名；parent_id 哨兵消除 + wall_clock 时间戳统一为 i64 毫秒
- `upsert_agent_state` 纳入 tx——消除跨表部分提交窗口

### Bug Fixes

- **agent WS 重连风暴**（`8d130537` 回归）：`handle_worldstate_send_failure` 误在零 receiver 时清空 `worldstate_tx`，而零 receiver 是 select! 间隙/初始 WorldState 推送的正常瞬时态→ `receive_world_state` 误判"Not connected"→ ~3Hz 重连死循环、零 intent。改为仅分级记日志、保留 sender
- **chronicle_id 生成 SQL**：`format('C-%03d', n)` 用了 PG 不支持的 C printf 说明符（PG 仅 `%s/%I/%L`）→ 每次群像传记落库失败。改用 `'C-' || lpad(n::text, 3, '0')`
- **tick/scheduler 游戏日边界漂移**：`tick_counter` ordinal 替代 `current_tick_id` modulo 墙钟秒，消除重启后偶发漂移
- **dashboard 经历日志 model_id**：归一到直读字段，根除 JSONB 解析脆弱性
- **reflector 硬性 OOC 词**：绝对禁止项不受生存凌驾/人设边界豁免（仅封顶到行为类意图）
- **run_migrations**：改用 `sqlx::raw_sql` 支持多语句，修复 dev 启动阻塞
- **emergence fetch_health**：`EXTRACT(EPOCH)` 返回 numeric 导致 sqlx panic
- **agent-web llm-disabled 持久化**：SSE 认证/协议断层（8 层根因修复）
- **chronicle get_chronicle**：读 raw_data 改用 Option 防 NULL 崩溃

### Quality

- **cargo fmt 全局归一化**：对齐当前 stable 的 let-chain 格式（CI `@stable` fmt 门），含 ReflectorSoul OOC 禁词表微调（移除"属性"，放宽元游戏过滤）
- clippy `-D warnings` 累积 lint 清理，dev 上线前质量门

## [0.1.267] - 2026-07-01

### Bug Fixes

- **tick/scheduler**: 修复游戏日边界检测（生存奖励结算+编年史）在服务器重启后的偶发漂移。使用 `tick_counter` ordinal 计数器（每 tick +1）替代 `current_tick_id` modulo 墙钟秒判断，消除 modulo 对齐对墙钟余数的偶发依赖，确保每 N 个 tick 精确触发一次

### 专用模型训练数据管线（reward + trace + 导出）

围绕"将 Agent 产生的 LLM 调用用于专用模型训练"目标，构建完整的数据采集→回传→导出管线。哲学锚点：天道无为——reward 纯锚定生存因果，声望/关系/心境是众生主观认知不进 reward。

- **生存 Reward**（server 侧）：
  - 每日结算（每游戏日=12tick）：生存分量 + 生理分量（satiation/hydration 归一化）+ 天魂审查分量（approved/rejected）
  - 一生结算（死亡时）：寿数 + 统一死亡 penalty（不分死因），不完整日按完整 `compute_daily_reward` 补算（生存按比例+生理死亡真值+天魂真值）
  - 周期聚合（复用 chronicle 7 日周期）+ 仪表盘 API（`GET /api/dashboard/reward/trends`）
  - 强制配置（reward.yaml，fail-fast），走 game_data 标准管线，零硬编码
  - 数据源改用 `agent_state_cache`（DashMap）消除时序竞态；`get_config`/`get_attribute_max_value` 失败显式 error 日志（非静默）
  - **BREAKING**：reward.yaml 为强制配置，缺失即中止启动（对齐 display_messages_loader fail-fast 模式）

- **训练 Trace 结构化落盘**（agent 侧）：
  - 人魂/天魂 LLM 调用结构化 JSONL（含 agent_id UUID + tick_id + prompt/response 全文 + soul_stage + attempt + persona_name/description + wall_clock）
  - persona 字段替代 system_prompt 全文（~200 bytes vs ~15KB，静态模板由配置复用，解决训练-推理分布不匹配）
  - 日志滚动覆盖：`max_size_mb` 配置（默认 1024MB=1G），超限按 LRU 删除最旧文件
  - SoulStage 枚举仅 Renhun/Tianhun（地魂不是独立调用方——其 tool-calling 是人魂内部轮次）
  - 强制配置（trace.yaml），默认开启采集+回传，零开销（Mutex 聚合 + 异步 flush）

- **Trace 回传 server**：
  - 协议新增 `ClientMessage::TraceReport` + `TraceEntry`，复用 websocket 回传
  - sender 注入：连接成功后 `set_upload_sender`（解决 init 在连接前的时序问题）
  - server `handle_trace_report` 落盘到 `traces/`（与 rewards/ 同目录树）
  - 原文记录（无脱敏——玩家角色均为 LLM 驱动，无隐私内容）
  - 并发修复：文件名含 agent_id，消除多 agent 同机并发写冲突

- **attempt 透传（DPO 配对根基解）**：
  - **BREAKING**：`DecisionWithChainCallback` 类型 + `think_direct` + `think_with_memory_and_feedback` + `cognitive_decision_with_chain` + `self_correct_intent` 签名均新增 `soul_cycle_attempt: i32` 参数
  - trace 记录真实外层 soul_cycle attempt（非 wall_clock 重建），DPO 配对精确可靠

- **训练数据导出脚本**（离线工具，只读）：
  - `scripts/build_sft_data.py`：筛天魂 approved 样本 → messages JSONL（system role 从 persona 重建），可选 --top-longevity
  - `scripts/build_dpo_data.py`：天魂 reject→approve 偏好对 → chosen/rejected JSONL（prompt 为含 system persona 的 messages 数组）
  - `scripts/analyze_social_structure.py`：恩怨双图 PageRank（观察工具，不写回 agent 状态）

- **端侧关系认知**（agent 侧，万物自化）：
  - 人魂 prompt"附近的人"段落注入 agent 对此人的主观关系认知（好感度+等级）
  - 完全本地：每 agent 只查自己的 relationship_store，尊重不对称，不进 reward

- **用户数据使用说明**：
  - Readme 新增「用户数据使用说明」章节
  - `docs/DATA_USAGE.md` 数据使用透明文档（采集内容/Opt-out 选择权）

**验证**：814 测试全绿，clippy 0 warning。双签 review 通过。

### CHANGELOG 版本转正 + release skill

- `scripts/version-bump.sh` 保持 pre-commit 模式（只 bump patch，不动 CHANGELOG）
- `/release` 指令（`.claude/skills/release/SKILL.md`）新增 Step 1：CHANGELOG `[Unreleased]` → `[版本号] - 日期` 转正

### 审计残留 4 项根治（P0-2 / P0-11b / clippy / warn! 测试）

针对 `logs/audit/audit-report-2026-06-24.md` 中 4 项残留问题的第一性原理根治：

- **P0-2 action_log 纳入 Saga 事务**：`batch_insert_action_logs` 签名从 `&PgPool` 改为 `&mut sqlx::PgConnection`，调用点移到 `tx.commit()` **之前**。若 action_log 插入失败，整个 Saga 回滚（state 不落库），消除"state 已提交但 log 丢失"的可观测性缺口。删除 4 行 `[RAW-DEBUG-batch]` 调试残留。新增 `test_p0_2_action_log_insert_before_commit_and_uses_tx` 源码契约测试。
- **P0-11(b) Agent HTTP API 认证层**：新增 `crates/agent/src/infra/api/auth.rs` 中间件（`require_device_token`），镜像 server 端 `require_*_token` 模式，通过 `Authorization: Bearer <token>` 验证 device auth_token。两个入口点（`run_http_server` + `run_ws_server`）均挂载。白名单：health/静态资源/setup。fail-closed：device 未配置时返 503。`setup/status` 端点暴露 token 供本地 Web 面板（`api.js` 新增 `buildHeaders`/`refreshAuthToken`）。新增 14 个认证测试。**BREAKING**：之前无认证的端点现在需要 Bearer token。
- **19 个 clippy warning 清零**：14 个 `collapsible_if`（let-chains）、4 个 `explicit_auto_deref`（`&mut *tx` → `&mut tx`）、1 个 `too_many_arguments`（`auto_rebirth_agent` 引入 `AutoRebirthParams` 结构体）。**BREAKING**：`auto_rebirth_agent` 签名变更（后 5 参数打包为结构体）。
- **42 处 warn! 行为测试**：新增 `tracing-test` dev-dep + 6 个代表性 warn! 契约测试（broadcast/mpsc/watch 三类 channel × 失败/成功两路）。**RED-GREEN 验证**：临时移除 warn! 代码确认测试 FAIL，恢复后确认 PASS。

**验证**：864 测试全绿（agent 495 + server lib 174 + 其他），6 PG 测试 ignored，clippy 0 warning，workspace 编译干净。

### Agent 死亡链路硬化

agent 死亡与转世重生全链路 P0 修复，消除幽灵状态与 auto_rebirth 永久拒绝风险：

- **Path 4 死亡检测**（`e66caafd`）：在原有 `is_dead` 原子标志（WebSocket `AgentDied` 回调）之外，新增从 intent 执行结果 error 字符串检测 `"is dead"` / `"not in cache"` 模式的双路径检测。修复"WebSocket 未收到 AgentDied 消息 → is_dead 永不为 true → agent 空转 + auto_rebirth 不触发"链路（联调测试 0615.docker.1 中 5 次死亡 3 次命中）。
- **转世重建 MemoryManager + PersonaStore**（`e8a16f96`, #51）：前世记忆/人格在新 agent_id 下未清空导致仍引用旧 DB；重生时清空情景/语义/工作记忆与人格/经验。
- **active 校验 + action 致死善后**（`a9d91016`）：
  - `get_all_alive_agents_latest_states` 加 `a.status='active'` 过滤，避免 retired/dead 历史 agent 启动时被加载进 DashMap (#49)
  - `IntentWorker` 处理前对 DB 二次校验 status='active'，命中残留即自愈移除 DashMap 条目 (#50)
  - step 11 + subsequent 路径检测 `is_alive=false` 时复用 `handle_deaths` 统一回写 status='dead'

### 武侠化叙事感知

让 LLM 真正以江湖中人视角感知世界，剥离游戏化术语与数值：

- **隐藏属性数值与术语**（`3ce60c09`）：prompt 增加"禁止元游戏术语"约束（HP/SAN/属性/数值/状态栏），`engine_prompts` / `context` 完全移除原始属性名和数值，仅输出叙事描述。
- **narrative_config 细化低值分段**（`3ce60c09`）：hp / satiation / hydration / sanity 低值分段（10-19 与 0-9 拆分），更精细的叙事化降级。
- **clippy + fmt 修复**（`f7e96d11`）：`values()` 迭代 + realtime fmt 修正。

### CI/CD 关键修复

- **embedding Dockerfile 致命 bug**（`ffbfbba7`, P0）：复制 workspace `Cargo.toml` + protocol/embedding/server 三个 crate 的 `Cargo.toml`，但缺失 `crates/agent/Cargo.toml`，导致整个 server stack 构建失败（`error: failed to load manifest for workspace member`）。补 COPY 行对齐 server Dockerfile。
- **Dockerfile.ci 同步**（`dcf8010c`）：同步上述 Dockerfile 修复到 Dockerfile.ci（embedding crate workspace）。
- **release job 依赖 docker-build**（`22c0000b`）：release job 必须等待 docker-build 成功，防止 docker 失败但 release 幽灵发布。

### 仓库维护

- **untrack Cargo.lock**（`f0834eb7`）：`.gitignore` 已列出但历史 force-added，解除跟踪后 cargo 构建不再污染 working tree。

### 白皮书

- **三皇共治描述顺序调整**（`489e5f58`）：白皮书 `05_宏观模型.md` 段落顺序调整（立场 → 决策机制 → 分权制衡），无内容变更。

---

> **BREAKING**（治理数据流重大重构）：
>
> - 删除 `ProposedActionIR` + `IRSource` 类型（protocol crate 0.1.73 → 后续版本）
> - DB migration 013 删除 `action_evolution_proposals` 表 IR 字段（actor_arity / target_arity / tick_span / phase_count / protocol_kind / effect_refs / requirement_refs）
> - DB migration 014 新增 `action_evolution_proposal_groups.stage` 列
> - `ProposalRequest` 字段变更：删除 `ir: Option<ProposedActionIR>`，新增 `action_data: serde_json::Value`
> - `ReviewVerdict` 新增 `reject_reason: Option<RejectReason>` + `inferred_action_config: Option<InferredActionConfig>` 字段
> - `GroupVote.vote` 类型从 `ProposalStatus` 改为 `VoteChoice`（与 votes 表字符串对齐）
> - `SoulsReviewConfig` 删除 `reject_threshold` 字段（管道不再使用）

### 三皇共审管道（Three-Soul Pipeline）

火云洞天宏观治理智能——三皇各司其职共审动作演化提案：

- **伏羲氏（演化之主）**：世界多样性 + 演化方向，倾向引入新变量。初审 + 终审双角色。
- **神农氏（生存之主）**：种群生存率 + 资源平衡，倾向稳健生态策略。同辈并行审议。
- **轩辕氏（秩序之主）**：世界观稳定秩序（天道法则自洽 + 世界循环稳定），不审查个体 agent 命运。同辈并行审议。

**三阶段管道**（每个 group 按 stage 持久化推进）：

```text
阶段 1：伏羲初审（awaiting_fuxi_initial）
  ├─ 拒绝 → 整组关单
  └─ 批准（含 inferred_action_config）→ 推进阶段 2

阶段 2：神农 ‖ 轩辕并行（awaiting_peer，tokio::join!）
  ├─ 全部拒绝 → 整组关单
  └─ ≥approve_threshold（默认 2/3）→ 推进阶段 3

阶段 3：伏羲终审（awaiting_fuxi_final，注入同辈反馈）
  ├─ dissent_log 阈值检查 → 升级 EscalatedAdmin
  ├─ 写入 actions.yaml 失败 → 保持 awaiting_fuxi_final 等下轮重试
  └─ 写入成功 → Approved + Done
```

**关键设计**：

- 禁止弃权（LLM 超时/失败强制 Reject）
- 同 similarity_key 多 proposal 共享 fate
- stage 持久化，重启可断点续跑
- close_stale_groups 仅关闭 awaiting_fuxi_initial 超时 group
- 写入失败保护：避免 group 标 Approved 但 actions.yaml 未写入的状态分裂

### 配置变更（souls.yaml）

- 启用 shennong（survival）+ xuanyuan（order）
- `topic_to_soul` + `topic_priority` 三皇完整映射
- `approve_threshold: 2`（含伏羲初审 + 至少一票同辈批准）
- 删除 `source_bindings` 配置（Phase 2 多 soul metric 监控延后）
- 删除 `reject_threshold`（管道不用，仅 approve_threshold 生效）

### 延后项（明确登记，Phase 2 实施）

- 神农氏核心职责：种群生存率/资源平衡/生态稳健的指标监控
- 轩辕氏核心职责：世界观稳定秩序监控（法则自洽/循环稳定/规则套利防御）

### 审计修复（前置 commit）

本次变更前已修复伏羲审议全链路审计问题（commits `f750b64d` ~ `ca463a08`），详见 git log。

---

## [历史归档]

> **BREAKING**: `ExecutionResult` 新增 `governance_code` 字段（向后兼容：`Option<GovernanceCode>` 序列化时 `skip_serializing_if`）。protocol crate 版本从 0.1.68 升级到 0.1.69。

### 治理系统 (Governance)

- **Soul 审议引擎 (SoulReviewEngine)**
  - 新增 `SoulReviewEngine`：基于 `souls.yaml` 配置的投票式提案审核引擎，支持硬性规则 (hard_reject_if / hard_approve_if) 自动裁定。
  - 引入 `ProposalStore`：提案组生命周期管理（PendingReview → UnderReview → Approved/Rejected/EscalatedAdmin）。
  - `TopicClassifier`：基于 `action_evolution.yaml` 规则的治理主题分类器，自动路由提案到对应 Soul。
  - 审议结果广播：Approved 提案组通过 `ConfigUpdate` 广播到所有在线 Agent。
- **动作演化 API (Action Evolution API)**
  - 新增 `POST /api/v1/action-evolution/propose`：Agent 提交动作演化提案。
- **数据库表**
  - `action_evolution_proposals`：动作演化提案表。
  - `action_evolution_proposal_groups`：提案组表。
  - `soul_review_votes`：Soul 审议投票记录表。

### 核心架构 (Core Architecture)

- **实时 Intent 处理管道 (Realtime Pipeline)**
  - 彻底退役 Tick 批处理，Intent 实现实时执行。
  - 引入 `IntentWorker`：单消费者 MPSC Channel 设计，消除所有状态锁竞争，确保完全无竞态。
  - `StateProcessor` 实现单 Intent Saga 事务回滚，保证 `DashMap` (内存 Write-Through 缓存) 与 PostgreSQL 绝对一致。
- **设备身份与角色分离 (Device-Character Separation)**
  - 角色生命周期重构：死亡角色保持 `dead` 状态，转世重生 (Auto-Rebirth) 从 UPDATE-in-place 改为 INSERT 全新 `agent_id`，保留设备与新角色的映射。
  - 归隐语义 (`retired`) 严格专属玩家主动操作，消除幽灵重生错误。
- **数据驱动的动作体系 (Data-Driven ActionType)**
  - `ActionType` 彻底数据驱动化。`transmission` (Broadcast/Session/Silent)、`display_name`、`validator_kind` 剥离硬编码，由 `actions.yaml` 定义。
- **动作系统 v2 原子化重构 — BREAKING**
  - 从 20 个语义化动作精简为 10 个原子原语：予/取/用/移动/说话/观察/攻击/休整/制造/教导（原给予/偷窃/进食/饮水/拾取/丢弃/采集/私语/大喊/打坐/修炼 已移除）。
  - 予/取/用 替代所有物品交互（出背包/入背包/消耗），纯方向性无社会语义。
  - 说话 通过 channel 参数（public/private/broadcast）统一三种形态。
  - 所有旧动作名从代码、配置、提示词、前端、测试中彻底移除，不做向后兼容。
  - 遗留数据中旧 action_type 字符串（如 "eat", "give"）将触发"未知的动作类型"错误。
- **关系图谱迁移 (RelationshipStore PRAGMA Migration)**
  - SQLite PRAGMA `user_version` 自动迁移落地，`relationships` 表从 5 列扩展为 7 列（新增 `self_description`, `description_tick`），代码量精简。

### 智能体认知 (Agent Cognitive)

- **Embedding 服务独立化 (Embedding Service Extraction)**
  - 提取独立 `crates/embedding/` crate，支持双模式部署：Docker 环境使用远程 HTTP 服务（端口 23350），进程部署使用本地内嵌推理。
  - `EmbedderService` 自动检测 `CYBER_JIANGHU_EMBEDDER_REMOTE_URL` 环境变量选择 Local/Remote/Unavailable 三种 provider。
  - 模型下载使用 reqwest + SHA256 校验（无 hf-hub 依赖），Dockerfile 构建时预下载模型。
  - Remote 模式 fast fail，不静默降级；OnceLock + async `ensure_initialized()` 消除 TOCTOU 竞态与 `block_in_place` 反模式。
- **Token 与注意力优化 (Attention & Token Optimization)**
  - 引入 `WorldStateStore` 与 `DeltaEngine` 记录状态增量，基于 `AttentionController` 输出 `FocusSummary`，替代全量 WorldState 注入 Prompt。
  - DeepSeek 前缀缓存调优：基于 system_hash 监控指标、D8 Reasoning 剥离、D9 JSON Schema 递归排序标准化，提高缓存命中率。
  - 规则按需检索 (Rule-On-Demand)：系统提示词仅保留索引，LLM 通过 `query_rules` 检索全文。
- **三魂架构演进 (Three-Soul Evolution)**
  - ReflectorSoul (天魂) 三层审查统一，作为唯一的 Intent 合规性验证入口。
  - 剥离所有别名容错，要求 LLM 输出精准 ID，错误由 ReflectorSoul 以叙事形式反馈拦截。
- **情绪-记忆联动 (CoreAffect)**
  - 基于 Barrett 情绪建构论，实现效价×唤醒度的核心情感计算，情绪门控增强记忆重要度，实现心境一致性检索偏置。

### 控制台与运维 (Admin & Control Panel)

- **Agent Web Panel SPA 重构**
  - 6 个分散的 HTML 重构为 3 页 SPA (#/dashboard, #/characters, #/settings)，消减冗余 CSS，实现细粒度组件渲染。
  - 暴露完整的 LLM 参数控制与热重载接口，支持自动重生配置动态开关。
- **指标与监控**
  - 完善 `/api/v1/metrics?system_hash=<hex>` 接口，支持精准的 LLM 性能度量与 Token 消耗分析。
