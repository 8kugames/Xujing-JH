# Xujing-JH 功能架构

**日期**: 2026-06-09

## 核心定位

- **Server (天道)**: 权威物理引擎，实时处理 Intent，Tick 驱动状态广播
- **Agent (众生)**: 自主 AI 决策，三魂架构，三级记忆系统

---

## Server (天道)

### P0 核心架构

- **实时 Intent 处理管道 (Realtime Pipeline)**
  - 基于单消费者 MPSC 队列的 `IntentWorker`，消除所有并发冲突。
  - **Saga 分布式事务模式**: DashMap (Write-Through) → StateProcessor 执行 → 持久化 PostgreSQL。持久化失败触发内存状态逆向回滚，保障绝对一致性。
  - **同地广播 (Co-located Broadcast)**: 动作执行后仅向处于同一 `node_id` 的 Agent 广播，避免全局网络风暴。
- **Tick 调度引擎**
  - 作为纯时钟推进时间，计算 HP、体力、各类属性衰减，并执行周期 WorldState 广播。
  - 寿终正寝判定。
- **10 原子数据驱动动作系统 (Data-Driven Actions)**
  - 从 20 个语义化动作精简为 10 个原子原语：予/取/用/移动/说话/观察/攻击/休整/制造/教导。予/取/用以纯方向性替代给予/偷窃/进食/饮水/拾取/丢弃/采集等社会语义分类；说话通过 channel 参数（public/private/broadcast）统一三种形态；休整替代休息/打坐/修炼。
  - `actions.yaml` 统一定义：`transmission`（Broadcast/Session/Silent）、`display_name`、`validator_kind`、`highlight_kind` 等属性。所有旧动作名彻底移除，不做向后兼容。

### P1 重要特性

- **设备与角色分离 (Device-Character Lifecycle)**
  - 死亡 (`dead`) 标记不可逆。
  - 自动重生 (Auto-Rebirth) 执行 `INSERT` 生成全新 `agent_id` 的角色，并继承设备所属权。归隐 (`retired`) 状态仅供玩家主动触发。
- **动态公式引擎**
  - 使用 `evalexpr` 动态计算属性派生和战斗伤害。

---

## Agent (众生)

### P0 核心架构

- **三魂架构 (Three-Soul Architecture)**
  - **人魂 (ActorSoul)**: 认知核心，单 LLM 调用内完成 Perception→Motivation→Planning→Decision 四阶段推演，生成结构化 Intent 和 CognitiveChain 溯源链。内置低 San 值混沌 (Chaos) 行为生成。
  - **地魂 (EarthSoul)**: 行动落地工具池，内嵌于 LLM 推理循环。提供 `search_memory`、`query_world`、`skill_view`、`list_skills` 等工具。具有严格的配额 (Budget) 和防死循环 (LoopGuard) 限制。
  - **天魂 (ReflectorSoul)**: 三层验证大闸 (Layer 1 基础类型 → Layer 2 RuleEngine 物理规则 → Layer 3 LLM OOC 审查)。验证失败会转换为叙事反馈重新注入人魂。
- **三级记忆与情绪门控 (Memory & CoreAffect)**
  - 工作记忆、基于 SQLite 的情景记忆 (受艾宾浩斯遗忘曲线影响)、基于 HNSW 向量索引的语义记忆 (bge-small-zh)。
  - **CoreAffect**: 基于 Barrett 情绪建构论，以效价×唤醒度动态调整事件重要度，实现情绪对记忆编码与检索的干预。

### P1 重要特性

- **多意图管道 (Subsequent Intents)**
  - Agent 可单次提交原子意图队列 (`subsequent_intents`)，Server 顺序独立执行每个原子意图，一旦某环节失败，仅回滚当前失败的意图并打断后续流程，已成功的意图保持成功。
- **Token 极致优化**
  - **DeltaEngine 与 AttentionController**: 对比本地 WorldStateStore 增量，提取 `FocusSummary`，替代全量世界状态注入 Prompt。
  - **DeepSeek 缓存调优**: 基于 `system_hash` 跟踪、剥离推理过程 (D8, 默认关闭，通过 `CYBER_JIANGHU_PROMPT_STRIP_REASONING_CONTENT` 启用)、JSON Schema 规范化 (D9)，最大化 Prefix Cache 命中。
- **元认知行为框架 (Procedural Skills)**
  - 基于经验阈值的被动技能系统。掌握 "进退之道" 等 AI 思考模型后，经由地魂 `skill_view` 工具供 LLM 按需查阅。
- **社交网络自动迁移**
  - `RelationshipStore` 使用 SQLite PRAGMA `user_version` 管理迁移，自动无缝升级 Schema（例如追加 `self_description` 列）。

### P2 体验增强

- **管理面板 SPA (Agent Web Panel)**
  - 完全由 JS 驱动的客户端渲染面板 (#/dashboard, #/characters, #/settings)，支持 SSE 实时查看推演日志。
- **纪传体传记 (Chronicle & Biography)**
  - 服务器每 7 游戏日生成全服群像传记。角色死亡时触发基于每日摘要的纪传体生成。

---

## 专用模型训练数据管线

> 哲学锚点：天道无为——reward 纯锚定生存因果，声望/关系/心境是众生主观认知不进 reward。
> 日期：2026-06-28

### Reward（server 侧）

- **每日结算**（每游戏日=12tick）：生存分量 + 生理分量（satiation/hydration）+ 天魂审查分量（approved/rejected）
- **一生结算**（死亡时）：寿数 + 统一死亡 penalty（不分死因）；不完整日按完整 `compute_daily_reward` 补算（生存按比例+生理死亡真值+天魂真值）
- **周期聚合**：复用 chronicle 7 日周期
- **仪表盘 API**：`GET /api/dashboard/reward/trends`、`/reward/lifetime/{id}`
- **配置驱动**：reward.yaml 强制配置（fail-fast），走 game_data 标准管线，零硬编码

### 训练 Trace 采集（agent → server）

- **结构化落盘**：人魂/天魂 LLM 调用 JSONL（agent_id UUID + tick_id + prompt/response 全文 + soul_stage + attempt + persona_name/description + wall_clock）
- **persona 字段替代 system_prompt 全文**（~200 bytes vs ~15KB，静态模板由配置复用，解决训练-推理分布不匹配）
- **日志滚动覆盖**：`max_size_mb` 配置（默认 1G），超限按 LRU 删除最旧文件
- **回传 server**：复用 websocket，`ClientMessage::TraceReport`，server 汇聚到 `traces/`（用 trace 真实时间分区）
- **原文记录**（无脱敏——玩家角色均为 LLM 驱动，无隐私内容）
- **attempt 透传**：外层 soul_cycle attempt 全链路透传到 trace（DPO 配对根基解，非 wall_clock 重建）
- **配置驱动**：trace.yaml 默认开启采集+回传，可 Opt-out（`output.enabled: false`）

### 训练数据导出（离线脚本）

- **SFT**：`scripts/build_sft_data.py` — 筛天魂 approved 合规样本 → messages JSONL（system role 从 persona 重建）
- **DPO**：`scripts/build_dpo_data.py` — 天魂 reject→approve 偏好对 → chosen/rejected JSONL（prompt 为含 system persona 的 messages 数组）
- **社会结构分析**：`scripts/analyze_social_structure.py` — 恩怨双图 PageRank（观察工具）

### 端侧关系认知（agent 侧，万物自化）

- 人魂 prompt"附近的人"注入 agent 对此人的主观关系认知
- 完全本地，尊重不对称，不进 reward

### 用户数据说明 + CHANGELOG 版本转正

- `docs/DATA_USAGE.md`：采集内容/Opt-out 说明
- Readme 「用户数据使用说明」章节
- `/release` 指令（`.claude/skills/release/SKILL.md`）新增 CHANGELOG `[Unreleased]` 转正步骤

---

## 动作演化治理 (Action Evolution Governance)

### P0 核心机制

- **拒绝 → 提案转化**: Agent 提交未知动作时，天魂拒绝后经 `ServerGovernanceMapper` 映射为 `GovernanceCode`（UnknownAction），Agent 异步提交提案（含 action_type + action_data + rationale）到 Server 演化池。
- **三皇共治（火云洞天宏观治理智能）**:
  - **伏羲氏（演化之主）**: 世界多样性 + 演化方向，倾向引入新变量。初审 + 终审双角色。
  - **神农氏（生存之主）**: 种群生存率 + 资源平衡，倾向稳健生态策略。同辈并行审议。
  - **轩辕氏（秩序之主）**: 世界观稳定秩序——天道法则自洽 + 世界循环稳定。不审查个体 agent 命运，不审查合理 violence（PK/报仇/抢夺是社会涌现）。
- **三阶段管道（stage 持久化）**:
  - 阶段 1：伏羲初审 → 拒绝直接关单 / 批准（含 inferred_action_config）推进阶段 2
  - 阶段 2：神农 ‖ 轩辕并行（tokio::join!）→ 全部拒绝关单 / ≥approve_threshold 推进阶段 3
  - 阶段 3：伏羲终审（注入同辈反馈，可能调整 inferred_action_config）→ 写入 actions.yaml
- **管道约束**:
  - 禁止弃权（LLM 超时/失败由系统强制注入 Reject）
  - 同 similarity_key 多 proposal 共享 fate
  - 写入失败保护：避免 group 标 Approved 但 actions.yaml 未写入的状态分裂
  - close_stale_groups 仅关闭 awaiting_fuxi_initial 超时 group
- **数据驱动**: `souls.yaml` 配置三皇 + `approve_threshold`（默认 2/3）+ 阶段超时；新增 Soul 只需加 YAML 条目。
- **能力注册表 (CapabilityManifest)**: 从 `ActionRegistry` 自动投影，作为审议引擎的"事实层"真源。
- **优雅降级**: `init_governance` 失败时 `governance: None`，非治理路径不受影响。

### 延后项（明确登记，Phase 2 实施）

- 神农氏核心职责：种群生存率/资源平衡/生态稳健的指标监控
- 轩辕氏核心职责：世界观稳定秩序监控（法则自洽/循环稳定/规则套利防御）
- `SourceProvider` trait 的实际 metric 接入

### 破坏性更新

- 删除 `ProposedActionIR` + `IRSource` 类型（protocol crate）
- DB migration 013 删除 `action_evolution_proposals` 表 IR 字段，新增 `action_data`
- DB migration 014 新增 `action_evolution_proposal_groups.stage` 列
- `ProposalRequest.ir` 字段删除，新增 `action_data: serde_json::Value`
- `ReviewVerdict` 新增 `reject_reason` + `inferred_action_config` 字段
- `GroupVote.vote` 类型从 `ProposalStatus` 改为 `VoteChoice`
- `SoulsReviewConfig` 删除 `reject_threshold` + `source_bindings` 字段
- 旧版 `ExecutionResult.governance_code` 字段保持向后兼容（`Option` + `skip_serializing_if`）
