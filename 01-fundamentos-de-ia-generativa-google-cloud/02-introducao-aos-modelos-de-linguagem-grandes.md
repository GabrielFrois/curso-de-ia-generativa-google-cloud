# Introdução aos modelos de linguagem grandes

## O que são Modelos de Linguagem Grandes (LLMs)?

São um subconjunto do aprendizado profundo (deep learning) e coexistem com a IA generativa. Eles são caracterizados por três atributos fundamentais:
- **Grandes:** Treinados em conjuntos de dados massivos (chegando a petabytes) e com bilhões de parâmetros, que atuam como o "conhecimento" ou "memória" aprendida pela máquina.
- **Uso Geral:** Devido ao seu tamanho, são capazes de resolver uma ampla gama de problemas comuns de linguagem humana desde o início.
- **Pré-treino e Ajuste Fino:** O modelo recebe um "pré-treino" para tarefas gerais e pode passar por um "ajuste fino" (treinamento especializado) para atuar em domínios específicos, como saúde, finanças ou direito.

## Vantagens sobre o Desenvolvimento Tradicional

Os LLMs, baseados principalmente na arquitetura de Transformadores (codificadores e decodificadores), oferecem grandes vantagens em relação ao Machine Learning (ML) tradicional:
- Um único modelo pode realizar várias tarefas diferentes (tradução, resumo, perguntas e respostas).
- Exigem o mínimo de dados para resolver novos problemas (few-shot) ou conseguem resolver sem exemplos explícitos (zero-shot).
- Não exigem experiência em ML, hardware pesado ou tempo de computação por parte do usuário final; basta saber usar a linguagem natural.

## A Arte dos Prompts e Tipos de Modelos

Como não é necessário programar regras, o desenvolvimento se concentra na forma de pedir as coisas à IA:
- **Design de Comandos:** Criar instruções claras e informativas para pedir uma tarefa à IA.
- **Engenharia de Comandos:** Um processo mais especializado para otimizar o desempenho do modelo em tarefas que exigem alta precisão, usando conhecimento de domínio ou exemplos.
- **Raciocínio de Cadeia de Pensamento:** Uma técnica em que o modelo é levado a explicar seu raciocínio passo a passo antes de dar a resposta final, o que aumenta muito a precisão em matemática e lógica.

## As 3 Categorias dos LLMs
- **Genéricos:** Preveem a próxima palavra com base no contexto (semelhante ao autocompletar).
- **Ajustados para Instruções:** Treinados para executar comandos específicos (ex: "Resuma este artigo" ou "Classifique este texto").
- **Ajustados para Diálogos:** Focados em manter o contexto em conversas longas de ida e volta (Chatbots).

## Ajuste Fino Eficiente

Para tornar os modelos especialistas em áreas técnicas (como medicina), você pode treiná-los com dados próprios. Como treinar e hospedar um modelo inteiro do zero é muito caro, a aula destaca métodos de ajuste com eficiência de parâmetros, onde o modelo base não é alterado, mas camadas complementares são ajustadas e acopladas a ele para gerar respostas especializadas.

## Ferramentas do Google Cloud
- **Vertex AI Studio:** Ambiente para desenvolvedores explorarem, personalizarem e colocarem modelos em produção, utilizando a biblioteca Model Garden.
- **Vertex AI Agent Builder:** Uma ferramenta low-code (pouco código) para criar assistentes virtuais, mecanismos de pesquisa internos e chatbots baseados em IA generativa sem precisar de experiência em ML.
- **Gemini:** O modelo multimodal de última geração do Google, que vai além de processar texto, conseguindo interpretar imagens, áudio e código de programação simultaneamente.
