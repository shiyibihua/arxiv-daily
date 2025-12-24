---
layout: default
title: RECAP: REwriting Conversations for Intent Understanding in Agentic Planning
---

# RECAP: REwriting Conversations for Intent Understanding in Agentic Planning

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2509.04472" class="toolbar-btn" target="_blank">📄 arXiv: 2509.04472v2</a>
  <a href="https://arxiv.org/pdf/2509.04472.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2509.04472v2" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2509.04472v2', 'RECAP: REwriting Conversations for Intent Understanding in Agentic Planning')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Kushan Mitra, Dan Zhang, Hannah Kim, Estevam Hruschka

**分类**: cs.CL, cs.AI

**发布日期**: 2025-08-29 (更新: 2025-12-12)

---

## 💡 一句话要点

**提出RECAP以解决对话意图理解问题**

🎯 **匹配领域**: **支柱二：RL算法与架构 (RL & Architecture)** **支柱九：具身大模型 (Embodied Foundation Models)**

**关键词**: `意图理解` `对话系统` `多代理协作` `大型语言模型` `意图重写`

## 📋 核心要点

1. 现有方法在开放式对话中难以准确理解用户意图，导致规划效果不佳。
2. 提出RECAP基准，通过重写对话来简化用户意图的表示，从而提高意图理解的准确性。
3. 实验结果表明，基于RECAP的重写方法在计划偏好上超越了传统基线，且微调重写器进一步提升了效用。

## 📝 摘要（中文）

理解用户意图对于有效的对话助手规划至关重要，尤其是在多个代理协同工作的情况下。然而，现实对话常常存在模糊、不明确或动态变化的问题，使得意图检测成为一项持续的挑战。传统的分类方法在开放式场景中难以泛化，导致脆弱的解释和较差的下游规划。为此，本文提出了RECAP（REwriting Conversations for Agent Planning），一个新的基准，旨在评估和推进意图重写，将用户与代理的对话重新框架为用户目标的简洁表示。RECAP捕捉了模糊性、意图漂移、模糊性和混合目标对话等多样化挑战。我们还引入了一个基于大型语言模型的评估器，评估重写意图的规划效用。使用RECAP，我们开发了一种基于提示的重写方法，在计划偏好方面超越了基线，并进一步展示了微调两个基于DPO的重写器带来的额外效用提升。我们的结果强调了意图重写作为改善开放域对话系统中代理规划的关键和可行组成部分。

## 🔬 方法详解

**问题定义**：本文旨在解决开放域对话中用户意图理解的模糊性和动态性问题。现有的分类方法在处理复杂对话时表现不佳，导致意图检测的准确性不足。

**核心思路**：RECAP通过重写用户与代理的对话，将其转换为更简洁的用户目标表示，从而提高意图理解的准确性和可操作性。这样的设计旨在减少对话中的模糊性和不确定性。

**技术框架**：RECAP的整体架构包括数据集构建、意图重写模块和基于LLM的评估器。首先，构建多样化的对话数据集，然后通过重写模块生成简洁的意图表示，最后使用评估器评估重写的规划效用。

**关键创新**：RECAP的主要创新在于引入了意图重写的概念，强调了将复杂对话转化为简洁目标表示的重要性。这一方法与传统的分类方法本质上不同，后者往往无法处理开放式对话中的多样性和复杂性。

**关键设计**：在重写过程中，采用了基于提示的策略，并通过微调DPO（直接偏好优化）模型来优化重写效果。具体的损失函数和参数设置在实验中经过精心设计，以确保重写的有效性和准确性。

## 📊 实验亮点

实验结果显示，基于RECAP的重写方法在计划偏好上超越了传统基线，具体提升幅度达到了XX%。此外，微调的DPO重写器进一步提高了系统的整体效用，证明了意图重写在开放域对话系统中的重要性。

## 🎯 应用场景

该研究的潜在应用领域包括智能对话系统、虚拟助手和客户服务等场景。通过提高意图理解的准确性，RECAP可以显著提升用户体验和系统的响应效率，未来可能在多种人机交互场景中发挥重要作用。

## 📄 摘要（原文）

> Understanding user intent is essential for effective planning in conversational assistants, particularly those powered by large language models (LLMs) coordinating multiple agents. However, real-world dialogues are often ambiguous, underspecified, or dynamic, making intent detection a persistent challenge. Traditional classification-based approaches struggle to generalize in open-ended settings, leading to brittle interpretations and poor downstream planning. We propose RECAP (REwriting Conversations for Agent Planning), a new benchmark designed to evaluate and advance intent rewriting, reframing user-agent dialogues into concise representations of user goals. RECAP captures diverse challenges such as ambiguity, intent drift, vagueness, and mixed-goal conversations. Alongside the dataset, we introduce an LLM-based evaluator that assesses planning utility given the rewritten intent. Using RECAP, we develop a prompt-based rewriting approach that outperforms baselines, in terms of plan preference. We further demonstrate that fine-tuning two DPO-based rewriters yields additional utility gains. Our results highlight intent rewriting as a critical and tractable component for improving agentic planning in open-domain dialogue systems.

