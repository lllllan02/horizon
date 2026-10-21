---
title: "Factory：怎样评测压缩后的任务状态保留"
aliases: ["Evaluating Context Compression for AI Agents"]
parent: context-compaction#效果判断
category: "Agent"
tags: ["上下文管理", "文本压缩", "评测"]
created_at: "2026-10-11 15:37:35"
updated_at: "2026-10-13 12:48:15"
source: "[Evaluating Context Compression for AI Agents](https://factory.com/news/evaluating-compression)"
reading_suggestions:
  - complexity-trap-summary
---

**「Factory 用压缩后的问答探针检查事实、文件状态、后续计划和决策依据是否保留；这比摘要文字相似度更贴近任务延续，但仍不等于实际完成任务。」** 本文导读对应 Factory Research 于 2025-12-16 发布的厂商自评。

## 怎样比较？

研究取自 36,611 条生产会话消息，在数百个压缩点对同一历史前缀应用三种方案：Factory 的结构化增量摘要、文中所测 Anthropic 摘要、OpenAI 压缩接口。Factory 摘要来自生产，其余方案通过相应接口生成。

压缩后提出四类问题：原始事实是什么、哪些文件变了、下一步做什么、为什么作出某个决定。GPT-5.2 在不知道方案名称的情况下，按准确性、状态感知、文件轨迹、完整性、延续性和指令遵循六维评分。

## 结构具体保住了什么？

Factory 将意图、文件修改、决策与下一步分栏，摘要新增移出窗口的片段，再并入既有状态。原文用登录故障示例说明：只记得「修复认证配置」，与记住具体端点、错误码和会话存储原因，支持的后续行动不同。

综合评分分别为 Factory 3.70、Anthropic 3.44、OpenAI 3.35（满分 5）。三者最弱的文件轨迹维度只有 2.19–2.45，结构化摘要也未解决完整文件追踪。作者因此主张**「关注整项任务成本，而非仅看压缩率」**，并提出专门维护文件状态的方向。

## 这些证据还缺什么？

以下是阅读判断：

- 探针答对能证明一部分信息可恢复，但真实执行还涉及工具选择、环境变化和最终验证。下一步应让压缩后的 Agent 继续工作，统计失败和补读成本。
- 三种实现的格式、更新方式与底层模型共同变化，结果不能单独证明「增量」或「分栏」导致优势。要分离作用，需固定其他条件逐项替换。
- 厂商自评及模型裁判的评分不应直接当作通用排名。复现时需固定摘要提示、接口版本、压缩点、回答模型与评分规则，并以原始日志核查文件事实。

与 [[complexity-trap-summary|The Complexity Trap]] 对照时，前者直接测解题与成本，本篇主要定位信息保留质量；两者可以组成「结果是否变差 → 具体丢了什么」的诊断过程。

原文定位：`Three approaches to compression`、`A concrete example`、`Results` 和附录评分规则。产品描述仅代表该次研究中的方案，本文未独立复现其结果。
