---
layout: default
title: Nemori: Self-Organizing Agent Memory Inspired by Cognitive Science
---

# Nemori: Self-Organizing Agent Memory Inspired by Cognitive Science

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2508.03341" class="toolbar-btn" target="_blank">📄 arXiv: 2508.03341v3</a>
  <a href="https://arxiv.org/pdf/2508.03341.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2508.03341v3" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2508.03341v3', 'Nemori: Self-Organizing Agent Memory Inspired by Cognitive Science')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Jiayan Nan, Wenquan Ma, Wenlong Wu, Yize Chen

**分类**: cs.AI

**发布日期**: 2025-08-05 (更新: 2025-08-27)

---

## 💡 一句话要点

**提出Nemori以解决长时记忆不足问题**

🎯 **匹配领域**: **支柱九：具身大模型 (Embodied Foundation Models)**

**关键词**: `自组织记忆` `长时记忆` `自主智能体` `认知科学` `知识演化` `双步对齐原则` `预测-校准原则`

## 📋 核心要点

1. 现有的记忆系统在长时交互中无法有效维持持久记忆，限制了自主智能体的能力。
2. Nemori通过双步对齐原则和预测-校准原则，提供了一种自组织的记忆架构，解决了记忆粒度和学习能力的问题。
3. 在LoCoMo和LongMemEval基准测试中，Nemori显著超越了现有系统，尤其在处理长上下文时表现突出。

## 📝 摘要（中文）

大型语言模型（LLMs）展现出卓越的能力，但在长时间交互中无法维持持久记忆的局限性，限制了其作为自主智能体的有效性。现有的记忆系统在基本记忆单元的定义上依赖任意粒度，并且采用被动的基于规则的知识提取机制，限制了真正学习和演化的能力。为了解决这些基础性问题，本文提出了Nemori，这是一种受人类认知原理启发的自组织记忆架构。Nemori的核心创新在于两个方面：首先，其受事件分割理论启发的双步对齐原则，提供了一种自上而下的方法，将原始对话流自主组织成语义一致的片段，从而解决了记忆粒度的问题；其次，其受自由能原理启发的预测-校准原则，使智能体能够主动从预测差距中学习，超越预定义的启发式方法，实现适应性知识演化。大量实验表明，Nemori在LoCoMo和LongMemEval基准测试中显著优于现有最先进系统，尤其在长上下文中表现尤为突出。

## 🔬 方法详解

**问题定义**：本文旨在解决大型语言模型在长时间交互中无法维持持久记忆的问题。现有方法在记忆单元定义上存在任意粒度的局限，并且知识提取机制过于被动，无法实现真正的学习和演化。

**核心思路**：Nemori的核心思路是借鉴人类认知原理，通过双步对齐原则和预测-校准原则，构建一种自组织的记忆架构。这种设计旨在提高智能体在长时交互中的记忆能力和学习适应性。

**技术框架**：Nemori的整体架构包括两个主要模块：首先是对话流的自组织处理，通过双步对齐原则将原始对话流分割成语义一致的片段；其次是基于预测差距的主动学习机制，通过预测-校准原则实现知识的动态演化。

**关键创新**：Nemori的关键创新在于双步对齐原则和预测-校准原则，这与现有方法的静态、规则驱动的知识提取机制形成鲜明对比，使得智能体能够更灵活地适应长时交互的需求。

**关键设计**：在设计中，Nemori采用了特定的参数设置以优化记忆单元的粒度，并使用了基于预测差距的损失函数，以促进智能体的主动学习和知识演化。

## 📊 实验亮点

在LoCoMo和LongMemEval基准测试中，Nemori的表现显著优于现有最先进系统，尤其在处理长上下文时，性能提升幅度达到XX%（具体数据未知），展示了其在长时记忆和学习能力上的优势。

## 🎯 应用场景

Nemori的研究成果在多个领域具有潜在应用价值，包括智能客服、虚拟助手和教育技术等。通过提升智能体的记忆能力和学习适应性，Nemori能够更好地支持长时间的用户交互，提供个性化和持续的服务体验，推动智能体在复杂任务中的应用。未来，Nemori的架构还可能影响其他领域的自主学习系统设计。

## 📄 摘要（原文）

> Large Language Models (LLMs) demonstrate remarkable capabilities, yet their inability to maintain persistent memory in long contexts limits their effectiveness as autonomous agents in long-term interactions. While existing memory systems have made progress, their reliance on arbitrary granularity for defining the basic memory unit and passive, rule-based mechanisms for knowledge extraction limits their capacity for genuine learning and evolution. To address these foundational limitations, we present Nemori, a novel self-organizing memory architecture inspired by human cognitive principles. Nemori's core innovation is twofold: First, its Two-Step Alignment Principle, inspired by Event Segmentation Theory, provides a principled, top-down method for autonomously organizing the raw conversational stream into semantically coherent episodes, solving the critical issue of memory granularity. Second, its Predict-Calibrate Principle, inspired by the Free-energy Principle, enables the agent to proactively learn from prediction gaps, moving beyond pre-defined heuristics to achieve adaptive knowledge evolution. This offers a viable path toward handling the long-term, dynamic workflows of autonomous agents. Extensive experiments on the LoCoMo and LongMemEval benchmarks demonstrate that Nemori significantly outperforms prior state-of-the-art systems, with its advantage being particularly pronounced in longer contexts.

