---
title: "Agent 概念、原理与构建模式：ReAct 与 Plan-and-Execute 拆解"
date: 2026-03-20T00:00:00+08:00
lastmod: 2026-03-20T00:00:00+08:00
slug: "agent-concepts-react-plan-execute-patterns"
description: "介绍 AI Agent 的概念与原理，拆解 ReAct 与 Plan-and-Execute 两种主流模式，并列举其他较少用或过时的模式及其缺点。"
tags: ["AI", "Agent", "ReAct", "LLM", "科普"]
cover:
  image: "https://cdn.somlar.com/2026/05/09eed25cab7fee7a0dccf8d0e18b0c8e.png"
  alt: "Agent Patterns: ReAct 与 Plan-and-Execute 架构示意图"
  width: 1536
  height: 1024
  srcset: "/images/articles/agent-patterns-640.webp 640w, /images/articles/agent-patterns-1024.webp 1024w, /images/articles/agent-patterns-1536.webp 1536w"
---

AI Agent（智能体）是能够自主感知、决策、执行并达成目标的系统。在 LLM 时代，Agent 通常指「大模型 + 工具调用 + 循环控制」的组合，能够完成多步任务、调用外部 API、根据反馈调整行为。本文介绍 Agent 的概念与原理，重点拆解 **ReAct** 和 **Plan-and-Execute** 两种主流模式，并列举其他较少用或过时的模式及其缺点。（关于 Tool、MCP 等基础概念，可参考 [LLM 与 AI 应用核心概念科普](/blog/llm-ai-concepts-token-prompt-mcp-skill/)。）

---

## 一、Agent 的概念与原理

### 1.1 什么是 Agent

**Agent** 在 AI 语境下指具备以下能力的系统：

- **感知**：接收输入（用户请求、环境状态、工具返回结果）
- **决策**：根据当前状态选择下一步动作（调用工具、生成回复、结束任务）
- **执行**：调用工具或输出内容，与环境交互
- **目标导向**：围绕用户给定的目标组织行为，而非单次问答

与普通「问答式」LLM 不同，Agent 会**多轮**与外部世界交互，根据反馈调整策略，直到达成目标或达到迭代上限。

### 1.2 核心组成

| 组件 | 作用 |
|------|------|
| **LLM** | 理解任务、规划步骤、选择工具、整合结果 |
| **工具 (Tools)** | 搜索、计算、查库、发邮件等外部能力 |
| **记忆/状态** | 保存对话历史、中间结果、计划步骤 |
| **控制循环** | 决定何时思考、何时行动、何时结束 |

### 1.3 构建模式概览

不同 Agent 架构在「何时规划」「如何执行」「是否可调整」上差异很大，形成多种**构建模式**。主流模式包括：

- **ReAct**：边推理边行动，动态循环
- **Plan-and-Execute**：先规划再执行，可含重规划
- **REWOO**：预规划、无动态调整（较少用）
- **Reflexion**：从失败中学习、多轮试错（特定场景）
- **LLM Compiler**：并行工具调用、DAG 工作流（高性能场景）

下文重点拆解 ReAct 与 Plan-and-Execute，再简要列举其他模式。

---

## 二、ReAct 模式拆解

### 2.1 核心思想

**ReAct (Reasoning + Acting)** 将**推理**与**行动**交织在同一循环中：模型交替进行「思考（Thought）」和「行动（Action）」，根据 **观察 (Observation)** 决定下一步。

```
Thought（思考）→ Action（行动）→ Observation（观察）→ Thought → ...
```

### 2.2 工作流程

1. **Thought**：模型根据当前上下文，用自然语言说明「我接下来要做什么、为什么」
2. **Action**：选择工具并传入参数，例如 `search("东京天气")`
3. **Observation**：工具返回结果，作为下一轮输入
4. **循环**：根据观察继续 Thought → Action，直到模型认为可以给出最终答案

### 2.3 简单例子

用户问：「东京今天天气如何？有什么值得去的景点？」

```
Thought: 需要先查东京天气，再查景点推荐。
Action: search("东京 今日 天气")
Observation: 晴，25°C，适宜出行。

Thought: 天气不错，接下来查景点。
Action: search("东京 推荐 景点")
Observation: 浅草寺、东京塔、涩谷...

Thought: 信息已足够，可以综合回答。
Answer: 东京今天晴，25°C。推荐浅草寺、东京塔、涩谷等。
```

### 2.4 优缺点

| 优点 | 缺点 |
|------|------|
| 灵活，可根据观察动态调整 | 工具串行执行，无法并行 |
| 推理过程可解释，便于调试 | 每步都调 LLM，调用次数多、成本较高 |
| 通过外部观察「接地」，缓解幻觉 | 若未设好终止条件，可能陷入循环 |
| 适合探索性、工具需求不确定的任务 | 对「一开始就能规划好」的任务略显冗余 |

### 2.5 适用场景

- 需要搜索、计算、查库等外部工具的问答
- 工具选择依赖上一步结果的探索性任务
- 实时信息查询、API 集成

---

## 三、Plan-and-Execute 模式拆解

### 3.1 核心思想

**Plan-and-Execute** 将任务分为**规划**与**执行**两阶段：先由规划器生成多步计划，再由执行器按步骤调用工具，必要时可**重规划 (Replan)**。

```
用户请求 → Planner（规划）→ 步骤列表 → Executor（执行）→ 结果
                                    ↑
                            （可选）根据执行反馈 Replan
```

### 3.2 工作流程

1. **规划**：Planner 根据用户请求，输出有序步骤列表，如 `[1. 查天气, 2. 查景点, 3. 综合回答]`
2. **执行**：Executor 按步骤依次调用工具，收集结果
3. **重规划 (可选)**：若某步失败或发现计划不合理，可触发 Replanner 调整后续步骤
4. **汇总**：将各步结果整合为最终回复

### 3.3 与 ReAct 的对比

| 维度 | ReAct | Plan-and-Execute |
|------|-------|------------------|
| 规划时机 | 每步动态规划 | 事先一次性规划 |
| 调整能力 | 每步可根据观察调整 | 依赖 Replanner，否则计划固定 |
| LLM 调用 | 每步都调，次数多 | 规划一次 + 每步执行，可更少 |
| 幻觉控制 | 依赖逐步观察 | 计划约束工具选择，减少乱调用 |
| 并行潜力 | 串行为主 | 可识别独立步骤，支持并行 |
| 适用任务 | 探索性、工具不确定 | 步骤清晰、可分解的任务 |

### 3.4 优缺点

| 优点 | 缺点 |
|------|------|
| 计划约束工具调用，减少幻觉和冗余操作 | 规划错误会传导到执行，需 Replanner 补救 |
| 可并行执行独立步骤，提高效率 | 步骤不清晰时，规划质量下降 |
| 执行可用更便宜的模型，降低成本 | 对「边做边探索」的任务不够灵活 |

### 3.5 适用场景

- 步骤明确的多步任务（调研、分析、报告生成）
- 需要控制成本、减少 LLM 调用的场景
- Claude Code、Cursor、Devin 等编码 Agent 常采用类似「计划—执行」分离的设计

---

## 四、其他较少用或过时的模式

### 4.1 REWOO：预规划、无动态调整

**REWOO (Reasoning With Outer Observation)** 采用「先规划、后执行」：Planner 一次性生成完整计划（含占位符），Worker 并行执行工具调用，Solver 汇总结果。

**缺点**：

- **过度依赖规划器**：规划错误时，后续执行无法纠正，全盘皆错
- **缺乏动态调整**：执行器机械执行，无法根据观察重规划
- **复杂任务规划难**：难以在初始阶段制定完备计划

因此，REWOO 逐渐被带 Replanner 的 Plan-and-Execute 取代，目前较少单独使用。

### 4.2 Reflexion：从失败中学习

**Reflexion** 让 Agent 在失败后**反思**错误，将反思结果存入记忆，再重试。适合有明确评估标准（如测试用例）的任务，如代码生成、算法题。

**缺点**：

- **成本高**：多轮完整尝试，每次失败都重跑，LLM 调用多
- **依赖评估函数**：需可编程的成功/失败判断，通用任务难以适用
- **可能不收敛**：若问题本身难解，多轮试错仍可能失败

适合「质量优先、有测试、可接受多轮」的特定场景，通用 Agent 较少采用。

### 4.3 纯 Chain-of-Thought / 纯 Act-only：早期分离模式

在 ReAct 之前，**推理 (Chain-of-Thought)** 和 **行动 (Action)** 常被分开研究：

- **纯 CoT**：只做思维链，不调用工具，易产生幻觉、错误传播
- **纯 Act-only**：只调用工具，缺乏推理，难以综合多步结果得出最终答案

ReAct 论文指出，二者结合才能既「接地」（减少幻觉）又「会思考」（能综合）。这两种早期模式已基本被 ReAct 等融合模式取代。

### 4.4 AutoGPT 式「自主循环」：易失控

**AutoGPT** 类模式强调高度自主：Agent 自设子任务、多轮规划、自主迭代，直到「认为」任务完成。

**缺点**：

- **易失控**：目标模糊时，可能无限扩展子任务或偏离用户意图
- **成本不可控**：循环次数无上限，API 消耗难以预测
- **缺乏明确终止**：需人工或启发式规则干预

适合研究和小规模实验，生产环境需谨慎使用。

---

## 五、模式选择小结

| 模式 | 工具使用 | 成本 | 灵活性 | 适用场景 |
|------|----------|------|--------|----------|
| **ReAct** | 是 | 中 | 高 | 探索性问答、工具不确定 |
| **Plan-and-Execute** | 是 | 中低 | 中 | 步骤清晰、可分解任务 |
| **REWOO** | 是 | 低 | 低 | 工具可预测（已较少用） |
| **Reflexion** | 可选 | 高 | 中 | 有测试、质量优先 |
| **AutoGPT 式** | 是 | 不可控 | 过高 | 研究、实验 |

实际选型时，可优先考虑 ReAct（灵活、通用）或 Plan-and-Execute（成本可控、步骤明确），再根据任务特点调整。

---

## 六、延伸阅读

- [ReAct: Synergizing Reasoning and Acting in Language Models](https://react-lm.github.io/)（论文与示例）
- [ReAct 论文](https://arxiv.org/abs/2210.03629)（arXiv）
- [Agent Patterns 文档](https://agent-patterns.readthedocs.io/en/stable/patterns/choosing-a-pattern.html)（模式选择指南）
- [Plan-and-Execute 教程](https://github.langchain.ac.cn/langgraphjs/tutorials/plan-and-execute/plan-and-execute)（LangGraph）
