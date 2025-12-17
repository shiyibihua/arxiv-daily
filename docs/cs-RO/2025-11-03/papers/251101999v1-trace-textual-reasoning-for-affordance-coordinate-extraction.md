---
layout: default
title: TRACE: Textual Reasoning for Affordance Coordinate Extraction
---

# TRACE: Textual Reasoning for Affordance Coordinate Extraction

<div class="paper-toolbar">
  <div class="toolbar-left">
    <a href="https://arxiv.org/abs/2511.01999" target="_blank" class="toolbar-btn">arXiv: 2511.01999v1</a>
    <a href="https://arxiv.org/pdf/2511.01999.pdf" target="_blank" class="toolbar-btn">PDF</a>
  </div>
  <div class="toolbar-right">
    <button class="toolbar-btn favorite-btn" data-arxiv-id="2511.01999v1" 
            onclick="toggleFavorite(this, '2511.01999v1', 'TRACE: Textual Reasoning for Affordance Coordinate Extraction')" title="收藏">
      ☆ 收藏
    </button>
    <button class="toolbar-btn share-btn" onclick="copyLink()" title="复制链接">
      🔗 分享
    </button>
  </div>
</div>


**作者**: Sangyun Park, Jin Kim, Yuchen Cui, Matthew S. Brown

**分类**: cs.RO, cs.AI

**发布日期**: 2025-11-03

**备注**: ICCV 2025. *Equal contribution. †Corresponding author

**🔗 代码/项目**: [GITHUB](https://github.com/jink-ucla/TRACE)

---

## 💡 一句话要点

**TRACE：利用文本推理提升视觉语言模型在机器人操作中的空间定位精度**

🎯 **匹配领域**: **支柱一：机器人控制 (Robot Control)** **支柱三：空间感知 (Perception & SLAM)**

**关键词**: `视觉语言模型` `机器人操作` `文本推理链` `空间推理` `可供性预测`

## 📋 核心要点

1. 现有视觉语言模型难以将高级指令转化为机器人操作所需的精确空间可供性，且视觉思维链方法计算成本高昂。
2. TRACE方法通过引入文本推理链(CoR)，使模型在行动前外部化空间推理，从而提高定位精度。
3. 实验表明，TRACE模型在Where2Place基准测试中取得了显著的性能提升，验证了文本推理链的有效性。

## 📝 摘要（中文）

视觉语言模型(VLM)难以将高层指令转化为机器人操作所需的精确空间可供性。虽然存在视觉思维链(CoT)方法，但计算成本通常很高。本文提出TRACE（用于可供性坐标提取的文本推理），一种将文本推理链(CoR)集成到可供性预测过程中的新方法。我们使用该方法创建了TRACE数据集，这是一个通过自主流程生成的大规模数据集，将指令与显式文本理由配对。通过在此数据上微调VLM，我们的模型学会了在行动前外部化其空间推理。实验表明，TRACE调优的模型实现了最先进的性能，在主要的Where2Place (W2P)基准测试中达到48.1%的准确率（相对提升9.6%），在更具挑战性的W2P(h)子集中达到55.0%。关键的是，一项消融研究表明，性能与使用的推理数据量直接相关，证实了CoR的有效性。此外，对模型注意力图的分析揭示了一个可解释的推理过程，其中焦点在推理步骤中动态转移。这项工作表明，训练VLM生成文本CoR是提高基于VLM的机器人控制的精度、可靠性和可解释性的有效且稳健的策略。我们的数据集和代码可在https://github.com/jink-ucla/TRACE 获得。

## 🔬 方法详解

**问题定义**：现有视觉语言模型在机器人操作中，难以精确理解高层指令并转化为具体的空间坐标，导致操作失败。现有的视觉思维链方法虽然可以一定程度解决该问题，但计算复杂度高，难以实际应用。

**核心思路**：TRACE的核心在于利用文本推理链(CoR)来引导视觉语言模型进行空间推理。通过让模型先生成一段文本描述其推理过程，再根据推理结果预测目标坐标，从而提高预测的准确性和可解释性。这种方法借鉴了人类解决问题的思路，即先思考再行动。

**技术框架**：TRACE方法主要包含以下几个阶段：1) 数据集构建：使用自主流程生成大规模的TRACE数据集，该数据集包含指令、文本推理链和对应的目标坐标。2) 模型微调：在TRACE数据集上微调视觉语言模型，使其学习生成文本推理链并预测目标坐标。3) 推理过程：给定指令，模型首先生成文本推理链，然后根据推理链预测目标坐标。

**关键创新**：TRACE的关键创新在于将文本推理链引入到视觉语言模型的空间推理过程中。与传统的视觉思维链方法相比，TRACE方法更加高效，并且可以提供更清晰的推理过程，从而提高模型的可解释性。此外，TRACE数据集的构建也为该领域的研究提供了宝贵的数据资源。

**关键设计**：TRACE数据集的构建采用了自主流程，保证了数据的规模和质量。在模型微调过程中，使用了交叉熵损失函数来训练模型生成文本推理链，并使用L1损失函数来训练模型预测目标坐标。模型的注意力机制也被用于分析推理过程，从而提高模型的可解释性。

## 📊 实验亮点

TRACE模型在Where2Place (W2P)基准测试中取得了显著的性能提升，准确率达到48.1%，相对提升9.6%。在更具挑战性的W2P(h)子集中，准确率达到55.0%。消融实验表明，性能与使用的推理数据量直接相关，证实了文本推理链的有效性。注意力图分析揭示了模型的可解释推理过程。

## 🎯 应用场景

TRACE方法可应用于各种机器人操作任务，例如物体抓取、放置和组装。通过提高机器人对指令的理解和空间推理能力，可以实现更智能、更灵活的自动化生产线。此外，该方法还可以应用于虚拟现实和增强现实等领域，提高用户与虚拟环境的交互体验。

## 📄 摘要（原文）

> Vision-Language Models (VLMs) struggle to translate high-level instructions into the precise spatial affordances required for robotic manipulation. While visual Chain-of-Thought (CoT) methods exist, they are often computationally intensive. In this work, we introduce TRACE (Textual Reasoning for Affordance Coordinate Extraction), a novel methodology that integrates a textual Chain of Reasoning (CoR) into the affordance prediction process. We use this methodology to create the TRACE dataset, a large-scale collection created via an autonomous pipeline that pairs instructions with explicit textual rationales. By fine-tuning a VLM on this data, our model learns to externalize its spatial reasoning before acting. Our experiments show that our TRACE-tuned model achieves state-of-the-art performance, reaching 48.1% accuracy on the primary Where2Place (W2P) benchmark (a 9.6% relative improvement) and 55.0% on the more challenging W2P(h) subset. Crucially, an ablation study demonstrates that performance scales directly with the amount of reasoning data used, confirming the CoR's effectiveness. Furthermore, analysis of the model's attention maps reveals an interpretable reasoning process where focus shifts dynamically across reasoning steps. This work shows that training VLMs to generate a textual CoR is an effective and robust strategy for enhancing the precision, reliability, and interpretability of VLM-based robot control. Our dataset and code are available at https://github.com/jink-ucla/TRACE

