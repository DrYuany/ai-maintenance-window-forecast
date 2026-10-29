# 会话记忆机制设计：结构化快照 + 滚动摘要 + 增量缓存

日期：2026-10-29
状态：设计已评审，待实现

## 背景与问题

当前 agent 的会话记忆（[agent_memory.py](../../../backend/app/core/agent_memory.py)、
[memory_manager.py](../../../backend/app/core/memory_manager.py)）已有三层：
会话摘要（正则抽取约束/否决/待办）、用户画像、决策记忆。但存在两个问题：

1. **长多轮丢背景**：每轮把完整 `messages` 历史塞给 LLM
   （[agent_runtime.py:404](../../../backend/app/core/agent_runtime.py#L404)），
   长对话超过上下文窗口后，早期背景（约束、方案、动作）被截断丢弃。
2. **摘要太窄**：`build_summary` 只靠 4 种正则抽取约束，覆盖不了问答、产物、动作；
   且只在消息超阈值时才触发压缩。

数据库（[database.py](../../../backend/app/db/database.py)）里其实已经落库了
`messages`（对话）、`versions`（产物）、`agent_traces` / `solve_jobs`（动作）、
`working_memory`（状态）。问题不是「没存」，而是「没用对」——上下文组装绕开了这些
结构化数据，直接塞全量原文。

## 目标与非目标

**目标**：单个会话内，多轮对话不再遗忘背景（约束/产物/动作/问答），上下文有界、
可回查、增量缓存。

**非目标**（本轮明确不做）：

- 跨会话检索（不引入向量库 / embedding）。
- 用户画像（不提炼长期偏好）。
- 全量 LLM 摘要（保持确定性为主，LLM 可选增强）。

## 方案：结构化快照 + 滚动摘要 + 增量缓存

从三个备选方案中选定方案 A（备选见文末附录）。

### 1. 数据模型 —— 会话记忆快照

在现有 `conversation_summary` 基础上，扩展为按会话**增量维护**的结构化快照
（SQLite，payload 为 JSON）。新增/复用一张 `conversation_memory` 表，
`conversation_id` 为主键。

```
{
  "messageCount": 42,                 // 增量判断与缓存失效锚点
  "state": {                          // 来自 working_memory
    "goal": "...", "activeView": "...",
    "filters": {...}, "pendingChange": {...}
  },
  "constraints": [                    // 已确认约束（确定性抽取）
    "船租上涨 20%", "最多 2 条作业线"
  ],
  "artifacts": [                      // 产物引用（来自 versions）
    { "versionId": "...", "strategy": "成本最低优先", "cost": 2821043, "scheduled": 11 }
  ],
  "actions": [                        // 动作时间线（来自 traces / solve_jobs）
    { "type": "solve", "versionId": "...", "status": "FEASIBLE", "at": "..." },
    { "type": "preview_change", "change": "船租上涨 20%", "at": "..." },
    { "type": "approve", "versionId": "...", "at": "..." }
  ],
  "qa": [                             // 关键问答
    { "q": "为什么任务018没排上", "a": "...", "versionId": "...", "at": "..." }
  ],
  "summary": "……",                     // 滚动摘要（旧消息压缩）
  "recentMessageIds": ["msg-39", "msg-40", "msg-41", "msg-42"]  // 最近 N 条原文指针
}
```

关键性质：

- **增量更新**：每轮只 append 新事件、更新变化字段，不重扫全量历史。
- **快照即缓存**：上下文组装直接读快照，不再每轮 `list_by_conversation` 全量读 + 重算摘要。
- 各字段来源明确（state ← working_memory、artifacts ← versions、
  actions ← agent_traces/solve_jobs、constraints/qa ← 抽取），回查可溯源。

### 2. 上下文组装（根治「遗忘」的核心）

每轮给 LLM 的上下文从**快照**组装，不再塞全量历史：

```
[会话状态] goal / activeView / filters / pendingChange
[已确认约束] 来自快照，而不是靠 LLM 回忆
[最近方案] versionId / strategy / cost / scheduled
[动作时间线] 最近 K 条
[问答] 最近 M 条
[滚动摘要] …
[最近对话] 最近 N 条原文（按 recentMessageIds 取）
```

上下文**有界**，不随对话变长而膨胀；早期背景（约束/产物/动作）永远可回查。

### 3. 摘要机制（确定性 + 可选 LLM）

- **确定性为主**：扩展现有正则（约束/否决/待办），并直接从 traces / jobs / versions
  的结构化字段取动作与问答，不靠正则猜语义。
- **可选 LLM**：配置了 key 时用 LLM 压缩旧消息写自由文本摘要；失败或无 key 回退确定性，
  绝不阻塞主流程。
- 摘要永远标注「压缩记录，非完整对话」，具体数字以方案与工具为准。

### 4. 缓存策略

- 快照 = 持久缓存（落库、增量更新）。
- 进程内再加一层 LRU（按 `conversation_id`），`messageCount` 变化时失效对应条目；
  避免每轮读 DB。

### 5. 错误处理与测试

- LLM 摘要失败 → 确定性兜底。
- 快照缺失/损坏 → 从现有表（messages / versions / traces / solve_jobs）重建。
- 测试：
  - 20+ 轮长对话仍能正确回答早期约束；
  - 增量更新后的快照与全量重算一致；
  - LLM 缺失时摘要仍可用；
  - 快照重建（冷启动）与增量维护结果一致。

## 实施边界

- 只改后端记忆层与上下文组装；前端无需改动（除非要展示记忆，本轮不做）。
- 复用现有 `WorkingMemory` / `ConversationSummary` / `DecisionMemory` 仓储模式，
  不重写数据库层。
- 与「agent 过程可视化」分支（`feat/registry-driven-schema-prompt`）都改
  `agent_runtime.py`，合并时需注意冲突。

## 附录：备选方案（未选）

- **方案 B（纯结构化）**：不加摘要，只靠结构化字段承载记忆。最简，但自由文本里的
  背景（"你上次说的那个方案"）仍会丢。
- **方案 C（LLM 摘要压缩）**：Echomind 式，消息超阈值就 LLM 压缩。依赖 LLM 质量、
  确定性弱，与证据链/可复现原则冲突。
