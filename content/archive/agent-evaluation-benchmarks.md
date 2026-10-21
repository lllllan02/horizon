---
learning_status: pending
title: "Agent 基准测试"
parent: agent-evaluation
category: "Agent"
tags: ["Agent", "评测"]
created_at: "2026-10-13 11:00:15"
updated_at: "2026-10-13 11:06:45"
reading_suggestions:
  - bfcl-evaluation
  - tau-bench-evaluation
  - swe-bench-evaluation
  - browser-agent-benchmarks
  - gaia-evaluation
  - harbor-evaluation
  - agentdojo-evaluation
  - longmemeval-memory
---

**基准测试（Benchmark）是一组任务、环境、执行协议和评分方法，测量的是这些条件下的系统表现。** 选基准时先看它要求 Agent 做什么、检查什么结果，再看总分。

## 不同基准分别回答什么？

| 任务类型 | 代表依据 | 主要测量对象 | 迁移到业务时要补什么 |
| --- | --- | --- | --- |
| 仓库修复 | [[swe-bench-evaluation\|SWE-bench]] | 补丁应用后通过指定测试 | 业务验收、未覆盖缺陷与代码质量 |
| 终端任务 | [[harbor-evaluation\|Terminal-Bench／Harbor]] | 环境内产物与可执行验收 | 实际工具、资源和工作流约束 |
| 网页与桌面操作 | [[browser-agent-benchmarks\|WebArena／OSWorld]] | 网站、应用或文件的最终状态 | 账号、网络、权限和环境差异 |
| 客服与用户协作 | [[tau-bench-evaluation\|τ²-bench]] | 多轮沟通、工具与用户侧操作 | 真实用户分布、政策与接管成本 |
| 多轮工具调用 | [[bfcl-evaluation\|BFCL V3]] | 工具选择、参数和状态连续性 | 完整业务结果、权限与恢复 |
| 搜索与资料任务 | [[gaia-evaluation\|GAIA]] | 复杂取证后的可核验答案 | 长报告的覆盖、论证与引用质量 |
| 对抗与安全 | [[agentdojo-evaluation\|AgentDojo]] | 攻击目标与正常任务效用 | 自己的威胁模型和数据边界 |
| 跨会话记忆 | [[longmemeval-memory\|LongMemEval]] | 历史事实、更新与经验使用 | 自动写入、删除、隔离及真实行动 |

这张表按任务分工比较，不表示这些分数共享同一量纲。一个系统擅长短答案查找，不由此证明能可靠操作桌面或处理多轮业务。

## 怎样读一条榜单结果？

核对数据集修订与子集、模型版本、Agent Harness、工具和观察方式、资源与步数、重复次数、评分器，以及是否由维护方统一运行。允许联网、历史记忆、并行候选或人工介入，都会改变所测能力。

原论文与当前仓库也可能不同。τ 系列、OSWorld 和 BFCL 已有后续版本；本文引用的导读保留版本边界。不能把同名项目的旧论文任务量、新版评分和另一配置的成绩拼成一个结论。

若公开题目被反复用于提示优化、记忆或训练，成绩可能部分来自对题目的适应。固定保留集、按新来源或时间切分并补充私有任务，能减少一部分泄漏，但不能证明基础模型从未见过公开资料。

## 怎样借用 Benchmark 建自己的评测？

借用任务构造、初始化、参考解和验收方法；把任务替换为真实业务，再保留代表性、边界和对抗切片。先运行少量任务校验环境与评分器，确认成本后再扩大。

公开基准适合发现能力边界或筛选候选；最终是否采用某个 Agent，应由业务任务、资源和可靠性约束决定。本文没有运行这些基准，也不据不同排行榜给模型排总名次。
