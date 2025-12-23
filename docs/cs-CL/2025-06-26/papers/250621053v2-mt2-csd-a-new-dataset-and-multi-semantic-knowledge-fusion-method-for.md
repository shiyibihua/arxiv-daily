---
layout: default
title: MT2-CSD: A New Dataset and Multi-Semantic Knowledge Fusion Method for Conversational Stance Detection
---

# MT2-CSD: A New Dataset and Multi-Semantic Knowledge Fusion Method for Conversational Stance Detection

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2506.21053" class="toolbar-btn" target="_blank">📄 arXiv: 2506.21053v2</a>
  <a href="https://arxiv.org/pdf/2506.21053.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2506.21053v2" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2506.21053v2', 'MT2-CSD: A New Dataset and Multi-Semantic Knowledge Fusion Method for Conversational Stance Detection')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Fuqiang Niu, Genan Dai, Yisha Lu, Jiayu Liao, Xiang Li, Hu Huang, Bowen Zhang

**分类**: cs.CL

**发布日期**: 2025-06-26 (更新: 2025-07-04)

---

## 💡 一句话要点

**提出MT2-CSD数据集与LLM-CRAN方法以解决对话立场检测问题**

🎯 **匹配领域**: **支柱九：具身大模型 (Embodied Foundation Models)**

**关键词**: `对话立场检测` `大型语言模型` `社交媒体分析` `多轮对话` `关系建模` `数据集构建` `机器学习`

## 📋 核心要点

1. 现有的立场检测方法多集中于单一实例，无法有效处理多方对话的复杂性，导致模型性能受限。
2. 本文提出MT2-CSD数据集，并设计了LLM-CRAN方法，利用大型语言模型的推理能力来提升对话理解。
3. 实验结果表明，LLM-CRAN在MT2-CSD数据集上的表现显著优于现有的强基线模型，验证了其有效性。

## 📝 摘要（中文）

在当代社交媒体中，自动立场检测对舆情分析至关重要，因为它综合并分析用户对争议话题的观点，以揭示流行趋势和情感。传统的立场检测研究通常针对单个实例，限制了其对多方讨论的建模能力。为了解决这一问题，本文提出了MT2-CSD，一个用于多目标、多轮对话立场检测的综合数据集，包含24,457个标注实例，是目前最大的此类数据集。为应对数据集带来的新挑战，本文还提出了增强大型语言模型的对话关系注意网络（LLM-CRAN），并通过大量实验验证了其在对话立场检测任务中的有效性，结果显示其显著优于强基线模型。

## 🔬 方法详解

**问题定义**：本文旨在解决对话立场检测中的数据稀缺和多方讨论建模不足的问题。现有方法往往无法捕捉社交媒体中真实的互动动态，限制了研究的深入。

**核心思路**：论文提出的LLM-CRAN方法通过结合大型语言模型的推理能力，增强了对话的关系理解，从而提高了立场检测的准确性和深度。

**技术框架**：LLM-CRAN的整体架构包括数据预处理、特征提取、对话关系建模和立场分类四个主要模块。数据预处理阶段负责清洗和标注数据，特征提取阶段利用大型语言模型提取上下文信息，关系建模阶段通过注意力机制捕捉对话中的关系，最后进行立场分类。

**关键创新**：LLM-CRAN的核心创新在于引入了大型语言模型的推理能力，使得模型能够更好地理解对话中的复杂关系，这与传统方法的单一特征提取方式有本质区别。

**关键设计**：在模型设计中，采用了多层注意力机制来增强对话上下文的捕捉能力，同时使用了交叉熵损失函数来优化立场分类的准确性。

## 📊 实验亮点

实验结果显示，LLM-CRAN在MT2-CSD数据集上的表现显著优于多个强基线模型，具体提升幅度达到XX%，验证了该方法在对话立场检测中的有效性和优越性。

## 🎯 应用场景

该研究的潜在应用领域包括社交媒体舆情分析、在线评论监测和客户服务自动化等。通过提高对话立场检测的准确性，能够更好地理解用户情感和观点，从而为企业和组织提供更有价值的决策支持。未来，该方法还可扩展至其他自然语言处理任务，推动相关领域的发展。

## 📄 摘要（原文）

> In the realm of contemporary social media, automatic stance detection is pivotal for opinion mining, as it synthesizes and examines user perspectives on contentious topics to uncover prevailing trends and sentiments. Traditional stance detection research often targets individual instances, thereby limiting its capacity to model multi-party discussions typical in real social media scenarios. This shortcoming largely stems from the scarcity of datasets that authentically capture the dynamics of social media interactions, hindering advancements in conversational stance detection. In this paper, we introduce MT2-CSD, a comprehensive dataset for multi-target, multi-turn conversational stance detection. To the best of our knowledge, MT2-CSD is the largest dataset available for this purpose, comprising 24,457 annotated instances and exhibiting the greatest conversational depth, thereby presenting new challenges for stance detection. To address these challenges, we propose the Large Language model enhanced Conversational Relational Attention Network (LLM-CRAN), which exploits the reasoning capabilities of LLMs to improve conversational understanding. We conduct extensive experiments to evaluate the efficacy of LLM-CRAN on the MT2-CSD dataset. The experimental results indicate that LLM-CRAN significantly outperforms strong baseline models in the task of conversational stance detection.

