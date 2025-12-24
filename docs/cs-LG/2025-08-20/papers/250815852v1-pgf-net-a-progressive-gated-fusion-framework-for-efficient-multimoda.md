---
layout: default
title: PGF-Net: A Progressive Gated-Fusion Framework for Efficient Multimodal Sentiment Analysis
---

# PGF-Net: A Progressive Gated-Fusion Framework for Efficient Multimodal Sentiment Analysis

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2508.15852" class="toolbar-btn" target="_blank">📄 arXiv: 2508.15852v1</a>
  <a href="https://arxiv.org/pdf/2508.15852.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2508.15852v1" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2508.15852v1', 'PGF-Net: A Progressive Gated-Fusion Framework for Efficient Multimodal Sentiment Analysis')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Bin Wen, Tien-Ping Tan

**分类**: cs.LG, cs.CL

**发布日期**: 2025-08-20

---

## 💡 一句话要点

**提出PGF-Net以解决多模态情感分析效率与可解释性问题**

🎯 **匹配领域**: **支柱二：RL算法与架构 (RL & Architecture)** **支柱九：具身大模型 (Embodied Foundation Models)**

**关键词**: `多模态情感分析` `深度学习` `渐进融合` `门控机制` `参数高效微调`

## 📋 核心要点

1. 现有多模态情感分析方法在效率和可解释性方面存在不足，难以有效融合不同模态的信息。
2. PGF-Net通过渐进层内融合和自适应门控仲裁机制，实现了动态且稳定的多模态信息整合，提升了模型的可解释性。
3. 在MOSI数据集上的实验结果显示，PGF-Net以仅3.09M的可训练参数达到了MAE为0.691和F1-Score为86.9%的优异性能。

## 📝 摘要（中文）

我们介绍了PGF-Net（渐进门控融合网络），这是一个旨在高效且可解释的多模态情感分析的新型深度学习框架。该框架包含三项主要创新：首先，提出了渐进层内融合范式，通过交叉注意力机制，使文本表示能够动态查询并整合来自音频和视觉流的非语言特征。其次，模型引入了自适应门控仲裁机制，作为动态控制器平衡原始语言信息与新融合的多模态上下文，确保稳定且有意义的整合。最后，采用混合参数高效微调策略，结合LoRA的全局适应与后融合适配器的局部细化，显著减少可训练参数，使模型轻量化，适合资源有限的场景。实验结果表明，PGF-Net在MOSI数据集上实现了最先进的性能，MAE为0.691，F1-Score为86.9%。

## 🔬 方法详解

**问题定义**：本论文旨在解决多模态情感分析中效率低下和可解释性不足的问题。现有方法在融合不同模态信息时，往往无法有效平衡信号与噪声，导致性能下降。

**核心思路**：PGF-Net的核心思路是通过渐进层内融合和自适应门控仲裁机制，动态整合文本、音频和视觉信息，从而提升情感分析的准确性和可解释性。

**技术框架**：PGF-Net采用分层编码器架构，主要模块包括渐进层内融合模块、门控仲裁模块和混合参数高效微调策略。通过这些模块，模型能够在深层次上进行动态融合。

**关键创新**：最重要的技术创新在于渐进层内融合范式和自适应门控仲裁机制，这使得模型能够在不同层次上有效整合多模态信息，避免了传统方法中信息融合的噪声干扰。

**关键设计**：模型采用了混合参数高效微调策略，结合了LoRA的全局适应与后融合适配器的局部细化，显著减少了可训练参数，使得PGF-Net在保持高性能的同时，具备了更好的计算效率。

## 📊 实验亮点

PGF-Net在MOSI数据集上取得了显著的实验结果，MAE为0.691，F1-Score达到86.9%。与现有方法相比，该模型以仅3.09M的可训练参数实现了优越的性能，展示了在性能与计算效率之间的良好平衡。

## 🎯 应用场景

PGF-Net在多模态情感分析领域具有广泛的应用潜力，尤其适用于社交媒体分析、情感计算和人机交互等场景。其高效性和可解释性使得该模型能够在资源有限的环境中发挥重要作用，推动情感分析技术的进一步发展。

## 📄 摘要（原文）

> We introduce PGF-Net (Progressive Gated-Fusion Network), a novel deep learning framework designed for efficient and interpretable multimodal sentiment analysis. Our framework incorporates three primary innovations. Firstly, we propose a Progressive Intra-Layer Fusion paradigm, where a Cross-Attention mechanism empowers the textual representation to dynamically query and integrate non-linguistic features from audio and visual streams within the deep layers of a Transformer encoder. This enables a deeper, context-dependent fusion process. Secondly, the model incorporates an Adaptive Gated Arbitration mechanism, which acts as a dynamic controller to balance the original linguistic information against the newly fused multimodal context, ensuring stable and meaningful integration while preventing noise from overwhelming the signal. Lastly, a hybrid Parameter-Efficient Fine-Tuning (PEFT) strategy is employed, synergistically combining global adaptation via LoRA with local refinement through Post-Fusion Adapters. This significantly reduces trainable parameters, making the model lightweight and suitable for resource-limited scenarios. These innovations are integrated into a hierarchical encoder architecture, enabling PGF-Net to perform deep, dynamic, and interpretable multimodal sentiment analysis while maintaining exceptional parameter efficiency. Experimental results on MOSI dataset demonstrate that our proposed PGF-Net achieves state-of-the-art performance, with a Mean Absolute Error (MAE) of 0.691 and an F1-Score of 86.9%. Notably, our model achieves these results with only 3.09M trainable parameters, showcasing a superior balance between performance and computational efficiency.

